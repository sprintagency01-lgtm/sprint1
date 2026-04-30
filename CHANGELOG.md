# Changelog

Registro vivo de cambios publicados al remoto. Formato: sección por fecha, subsecciones por tipo de cambio. Ver convención completa en `CLAUDE.md`.

Entrada más reciente arriba.

---

## 2026-04-29 (cambio de dominio canónico → `sprintiasolutions.com`)

Migración del backend del subdominio interno `web-production-98b02b.up.railway.app` al dominio canónico **`sprintiasolutions.com`** (Railway custom domain conectado al servicio `web` del proyecto `marvelous-charm`). Procedimiento completo paso a paso documentado en la guía nueva `DOMAIN_MIGRATION_2026-04-29.md` (DNS Porkbun → propagación → smoke SSL → OAuth → Railway env → webhooks ElevenLabs/Telegram → verificación final). El subdominio interno queda activo como fallback durante la ventana de convivencia.

### Añadido

- `DOMAIN_MIGRATION_2026-04-29.md` — playbook operativo con secciones DNS, OAuth, Railway, smoke tests (4 y 6) y rollback plan.
- Entrada visible del dominio canónico en `CLAUDE.md`, `BOT_NUEVO_CONFIG.md` y `DEPLOY_RAILWAY.md`.

### Cambiado

- `BOT_NUEVO_CONFIG.md` — todos los ejemplos de curl (`personalization`, `consultar_disponibilidad`, `healthcheck`) y la línea del `setup_elevenlabs_agent.py` ahora usan `https://sprintiasolutions.com`.
- `DEPLOY_RAILWAY.md` — placeholder de `GOOGLE_REDIRECT_URI` actualizado al dominio canónico; bloque de "Login en el CMS" reescrito reflejando el custom domain.
- `app/templates/landing.html` — `link rel=canonical`, `og:url`, `og:image`, `twitter:image` y los dos JSON-LD `url` (SoftwareApplication + Organization) ahora apuntan a `https://sprintiasolutions.com/`. Se conserva el email visible `hola@sprint.agency` a propósito hasta confirmar la migración del buzón.
- `app/cms/templates/leads.html` — copy del header pasa de "Capturados en sprint.agency" a "Capturados en sprintiasolutions.com".
- `scripts/setup_telegram_bot.py` — docstring de uso muestra el dominio nuevo como ejemplo y deja el antiguo como referencia histórica.
- `.env.example` — comentario sobre `GOOGLE_REDIRECT_URI` documenta la URL de producción y recuerda registrar la redirect URI en Google Cloud Console.

### Env / despliegue

- **Railway → servicio `web` → Variables**: `GOOGLE_REDIRECT_URI` debe pasar a `https://sprintiasolutions.com/oauth/callback`. El redeploy es automático.
- **Google Cloud Console → OAuth 2.0 Client**: añadir `https://sprintiasolutions.com/oauth/callback` a Authorized redirect URIs **sin retirar** la antigua todavía.
- **DNS Porkbun**: ALIAS apex (o CNAME `@` fallback) → `4p43tgc8.up.railway.app`, TTL 600. TXT `_railway-verify` → `railway-verify=10e13822169a8ee6153a98bf521df6dc111b01ddfcc630d6f4884e51111beecf`, TTL 600.
- Tras desplegar, ejecutar UNA vez `python scripts/setup_elevenlabs_agent.py https://sprintiasolutions.com` y `python scripts/setup_telegram_bot.py https://sprintiasolutions.com` para repintar webhooks externos.

### Notas

- No es breaking en sentido estricto: el subdominio Railway antiguo sigue respondiendo y los webhooks viejos continúan funcionando hasta el cleanup descrito en la sección 10 de la guía.
- Snapshots ElevenLabs en `docs/elevenlabs_agent_snapshot_*.json` mantienen el dominio antiguo a propósito (son históricos pre-migración).

---

## 2026-04-29 (anti-anglicismos en filler de Ana — caza del "duly noted")

Llamada real reproducida con flash_v2_5 (Marcos volvió desde v3 conversational): tras el primer `consultar_disponibilidad` con resultado vacío, Ana lanzaba un segundo `consultar_disponibilidad` ampliando rango y entre los dos colaba muletilla en inglés: "Duly noted... pues a las cinco está completo, pero tengo a las seis y media o a las siete". Patrón típico de LLM cuando el prompt no lista filler para esa situación específica — el modelo tira de muletillas pre-entrenadas en inglés.

### Corregido

- **`ana_prompt_new.txt` — sección nueva "## Idioma — SIEMPRE español de España"** entre "Estilo" y "UNA pregunta por turno". Lista negra explícita: `duly noted`, `noted`, `got it`, `okay`, `alright`, `sure thing`, `let me check`, `one moment`, `right away`, `indeed`. Equivalentes ES dados explícitos. Un BIEN/MAL concreto con la frase real del incidente.
- **`ana_prompt_new.txt` — "## Fillers antes de tool calls" reescrita**. Antes solo cubría la PRIMERA consulta. Ahora distingue tres categorías:
  - PRIMERA consulta ("vale, te miro un momento...", etc.).
  - SEGUNDA consulta tras hueco vacío al ampliar rango ("vale, miro un poco más tarde...", "déjame ampliar un poco la búsqueda...", "a ver si tengo algo más cerca..."). Es justo el slot donde aparecía el "duly noted".
  - Crear/mover/cancelar ("perfecto, te lo anoto...", etc.).

  Lista cerrada con instrucción literal "NUNCA 'duly noted', 'noted', 'okay' ni cualquier muletilla en inglés".

### Tests

- `pytest tests/`: 131 passing (sin cambios, prompt no rompe marcas canónicas).
- `scripts/test_dialog.py reserva_sin_peluquero` contra el agente con prompt actualizado: 7/7 OK.

### Notas

- El cambio es defensivo: el LLM (gemini-3-flash-preview) puede improvisar otras muletillas inglesas no listadas. Si vuelve a aparecer alguna, se añade a la lista negra. La instrucción genérica "TODO en español, sin excepciones" + ejemplos concretos suele bastar para Gemini 3 según la experiencia previa con encadenar preguntas (ver `PROMPT_KNOWLEDGE.md` §2.5).

---

## 2026-04-29 (flujo de hora concreta + asignación auto de peluquero + palancas latencia v3)

Tres cambios pedidos por Marcos en sesión: (1) flujo nuevo donde Ana acepta hora concreta del cliente y confirma o propone los 2 más próximos en lugar de soltar siempre 3 huecos, (2) asignación automática de peluquero por round-robin (menos cargado del día) cuando el cliente no expresa preferencia, y (3) más palancas de latencia compatibles con `eleven_v3_conversational` que Marcos prefiere a `eleven_flash_v2_5`.

### Añadido

- **`app/calendar_service.py::peluqueros_disponibles_en_slot`**: helper nuevo que hace UNA freebusy multi-calendar al día entero y devuelve los peluqueros libres en `[inicio, fin]` con su `busy_count_dia` (cantidad de bloques `busy` ese día). Coste constante con N peluqueros (typical 2-3) y ≈50 ms si el cache freebusy del prefetch está caliente.
- **`app/eleven_tools.py::_asignar_peluquero_walkin`**: round-robin sobre los libres → menor `busy_count_dia` con tie-break aleatorio entre empates. Cubre el caso de un equipo donde dos peluqueros están igual de tranquilos: a la larga reparte walk-ins entre ambos en lugar de cargar siempre al primero de la lista.
- **`tests/test_eleven_tools_latency.py`**: 2 tests nuevos sobre walk-in (`test_crear_reserva_walkin_elige_menos_cargado` valida el round-robin; `test_crear_reserva_walkin_falla_si_nadie_libre` valida la rama "no queda nadie libre"). Suite total: 131 tests passing.

### Cambiado

- **`app/eleven_tools.py::crear_reserva`**: lógica de calendario destino reescrita. Ahora cuando `peluquero` viene vacío o "sin preferencia" Y el tenant tiene equipo, el backend (a) elige peluquero por walk-in, (b) crea el evento en el calendario propio del peluquero (no en `primary` como antes), (c) devuelve el nombre real en `peluquero` para que Ana pueda decir "te he apuntado con Mario" en lugar de "sin preferencia". Si no hay nadie libre a esa hora → `ok:false` con mensaje legible para que Ana ofrezca otra hora.
- **`ana_prompt_new.txt`** — flujo de hora reescrito. Antes: `servicio → cuándo (franja) → consultar → ofrecer 3 huecos → elegir → nombre → crear`. Ahora: `servicio → cuándo (día Y hora) → consultar → CONFIRMAR/ofrecer 2 más próximos → elegir → nombre → crear`. Modo dual:
  - **3a) HORA CONCRETA** ("a las cinco"): rango ±60min, si hay coincidencia confirma directa "tengo a las cinco, ¿te va?"; si no, ofrece los DOS huecos más próximos. Sin lista innecesaria.
  - **3b) FRANJA** ("por la mañana"): rango amplio, ofrece máx 3 huecos como antes. Solo se entra aquí si el cliente no dio hora ni siquiera tras una repregunta.

  El paso 6 ahora explica que `peluquero` debe ir vacío salvo preferencia explícita y que el backend devuelve el peluquero asignado en la response (Ana puede usarlo en el cierre).

### Latencia

PATCH al agente `pelu_demo` aplicando palancas que faltaban (compatibles con `eleven_v3_conversational` + `gemini-3-flash-preview`):

- `backup_llm_config.preference: default` → `disabled` (libera el cascade timeout de 4 s; doc ronda 7).
- `cascade_timeout_seconds: 4.0` → `2.0` (defensivo; con backup disabled es ignorado, pero por si se reactiva).
- `agent.prompt.ignore_default_personality: false` → `true` (ahorra los tokens de la "personalidad por defecto" que ElevenLabs inyecta).
- `agent.prompt.max_tokens: 220` → `200` (3 huecos siguen cabiendo; recortamos margen tonto).
- `tts.speed: 1.04` → `1.08` (Ana habla un 4% más rápido; tiempo total de TTS baja ~4%, tiempo del TURN entero baja menos pero suma).

Resultado esperado: TTFR sigue en ~1200 ms, TT_final con v3 conversational debería bajar ~150-300 ms respecto al estado pre-palancas. Sin medir aún en bench WS — pendiente de iteración real.

### Tests

- `pytest tests/`: 131 passing (sumamos 2 sobre los 129 de la fase 2 de auditoría).
- `scripts/test_dialog.py reserva_sin_peluquero` contra el agente remoto: 7/7 checks OK, nombre preguntado en turno #8 tras `consultar_disponibilidad`, fechas con año 2026.

### Notas

- `expressive_mode: true` del TTS v3 conservado a propósito — es la palanca que diferencia v3 de flash y la razón por la que Marcos hizo el cambio. No se toca por mucho que coma latencia.
- El comportamiento "evento siempre en primary" de `_calendar_id_for_booking` sigue para tenants SIN peluqueros configurados (despachos individuales tipo `test_mario` abogado). Con equipo, la cita va al calendario del peluquero.

---

## 2026-04-29 (hotfix agente Ana — drift de prompt + LLM)

Llamada real reproduciendo bug: tras `corte de hombre`, Ana pedía el nombre antes de `consultar_disponibilidad` y se quedaba colgada en filler infinito (`Ahhh, entendido...`, `Mm-hmm...`). Diagnóstico: el agente remoto en ElevenLabs (pelu_demo) había sufrido drift respecto a la config canónica, probablemente por edición a mano en la UI:

- `llm` = `gemini-3.1-pro-preview` ← está en la lista de descartados (`PROMPT_KNOWLEDGE.md` §4.2: 7-10 s TTFR y cero tool calls). El canónico es `gemini-3-flash-preview`.
- `prompt` ≠ `ana_prompt_new.txt`. Era una versión más vieja, sin `<!-- REFRESH_BLOCK -->` ni macros de fecha, y con flujo invertido: `servicio → cuándo → NOMBRE → consultar`. Esto pisaba la regla de oro "nombre al FINAL, justo antes de crear_reserva".
- `thinking_budget` no estaba en `0`.

### Corregido

- PATCH al agente ElevenLabs vía API: prompt restaurado al render de `ana_prompt_new.txt` (con la fecha de hoy hardcodeada por `refresh_agent_prompt.py`), `llm = gemini-3-flash-preview`, `max_tokens = 220`, `temperature = 0.3`, `thinking_budget = 0`. No se ha tocado `ana_prompt_new.txt` local — se ha subido el canónico que ya estaba en repo.
- Snapshot pre-fix guardado en `docs/elevenlabs_agent_snapshot_pre_fix_2026-04-29.json` para que cualquier futuro drift sea diffeable.
- Verificado con `scripts/test_dialog.py reserva_sin_peluquero`: 7/7 checks OK, nombre preguntado en turno #6 tras `consultar_disponibilidad`, fechas con año 2026, tools en orden correcto.

### Notas

- El `first_message` remoto sigue siendo `"Hola, soy Ana de la peluquería. ¿En qué te puedo ayudar?"` (sin "hijoputa" — broma de Marcos documentada en `PROMPT_KNOWLEDGE.md` §2.6). No se ha revertido sin permiso.
- Recordatorio para el futuro yo: **no editar el agente desde la UI de ElevenLabs**. Cualquier cambio va por `ana_prompt_new.txt` + `scripts/refresh_agent_prompt.py` + `scripts/migrate_agent_latency.py`. La UI no respeta la config canónica y el drift es silencioso hasta que un cliente llama.

---

## 2026-04-29 (auditoría fase 2 — caps de duración, lifespan, docs)

Segunda pasada de auditoría tras los fixes de la mañana. Hallazgos nuevos: duración sin cap en tools de voz, `@app.on_event` deprecated, política de migraciones poco visible.

### Añadido

- **Caps de duración en tools de voz** (`app/eleven_tools.py`): constantes `_MIN_DURACION_MIN = 5` y `_MAX_DURACION_MIN = 240`. `ConsultaReq.duracion_minutos` ahora se valida con `Field(ge=5, le=240)` (Pydantic devuelve 422 al instante). `crear_reserva` y `mover_reserva` calculan `(fin - inicio).minutes` y rechazan con `{ok: false, retryable: false, error: "..."}` cuando se sale de rango (incluye duración invertida fin<=inicio). Sin esto, una alucinación del LLM podía ocupar 6h de agenda con una sola palabra mal interpretada.
- **`tests/test_eleven_tools_duration_caps.py`**: 4 tests del cap (consulta 422 por exceso, 422 por defecto, crear con 6h aborta sin tocar Calendar, crear con fin invertido aborta).

### Cambiado

- **Migración a `lifespan` en `app/main.py`**: los dos `@app.on_event("startup")` (`_register_sheets_sync` y `_warmup_google_client`) se han fusionado en un único `@asynccontextmanager` `_lifespan`. FastAPI 0.93+ deprecó `on_event`; ahora arrancamos sin `DeprecationWarning` y el orden de tareas de startup es explícito.

### Documentado

- **`app/db.py:_auto_migrate_sqlite`**: docstring ampliado con qué cubre (ADD COLUMN con default, renombrados puntuales) y qué NO (NOT NULL sin default, DROP COLUMN, cambios de tipo). Mención a Alembic como techo natural si crece la complejidad.

### Notas

- Falsos positivos del audit que NO se han tocado: forms anidados en `tab_general.html` (el form principal cierra antes del bloque), `except Exception` masivo (ya logean correctamente), prompt injection en tools (no hay re-feeding al LLM), CSRF (sería un endurecimiento aparte, fuera de scope hoy).
- 129 tests pasan tras este push (4 nuevos sumados al test del POST /equipo).

---

## 2026-04-29 (auditoría, hardening y limpieza)

Tras un primer fix por la mañana (días laborables del equipo, commit 51b7073), auditoría general del proyecto buscando bugs del mismo tipo y deuda. Encontrados varios bugs reales, otros descartados como falsos positivos. Cambios incluidos en este push:

### Añadido

- **`tests/test_cms_equipo_form.py`**: 3 tests de regresión del POST `/admin/clientes/{id}/equipo` que cubren (a) días distintos por miembro sin mezclas, (b) borrar miembro central y conservar mapeo, (c) descartar miembro al vaciar nombre. Sin estos tests, el bug de `loop.index0` mal indexado podría haberse colado de nuevo.
- **`docs/archive/AUDITORIA_2026-04-24.md`**: archivada la auditoría profunda de abril (h-1 drift TTS, h-3 idempotencia, etc.) que vivía suelta en raíz como untracked. Se mueve a `docs/archive/` para que esté en el repo y referenciable desde cualquier futuro audit.

### Corregido

- **`app/cms/routes.py`** — `datetime.utcnow()` reemplazado por `_today_local()` (Europe/Madrid) en las dos series de "últimos 30 días" del dashboard (línea ~211 y ~748). Antes, entre las 00:00 y las 02:00 hora Madrid el dashboard mostraba un día atrasado porque `utcnow()` aún estaba en el día anterior. Para los queries SQL contra `created_at` se mantiene UTC naive porque el schema de SQLAlchemy lo es; cambiar el schema requiere migración.
- **`app/cms/templates/partials/tab_personalization.html`** — banner ámbar en cabecera de la pestaña que avisa que sólo `assistant_name` afecta al agente de voz; el resto (tono, formalidad, emojis, prompt avanzado) alimentan al canal WhatsApp deprecated. Sin este aviso un cliente edita y no entiende por qué Ana sigue igual.

### Hardening

- **`.gitignore`**: añadidos `tenants.yaml` (nunca commitear el real, sólo el example), `*.db-journal`, `*.db-wal`, `*.db-shm` (artefactos transitorios de SQLite).

### Notas

- `tab_general.html` (forms anidados): falso positivo del audit. El form principal cierra antes del bloque de "Acceso al portal del cliente" (línea 102). Los 3 forms del bloque son hermanos, no anidados.
- Pestaña "Equipo": mantener el patrón "índice del miembro como `midx = loop.index0` en el outer loop + clase `dia-checkbox` + handler submit que renumera" en cualquier nuevo form de lista editable. Memoria persistente sobre esto.
- Tests del repo: 125 pasan tras este push (3 nuevos sumados).

---

## 2026-04-29 (CMS — fix: días laborables del equipo no se guardaban)

### Corregido

- **`app/cms/templates/partials/tab_equipo.html`**: los checkboxes de "Días laborables" se nombraban `dias_trabajo_{índice_día}` (0..6) en lugar de `dias_trabajo_{índice_miembro}`. Como el handler `POST /admin/clientes/{id}/equipo` espera el índice del miembro al hacer `form.getlist(f"dias_trabajo_{i}")` con `i = enumerate(nombres)`, los días marcados se mezclaban entre miembros y a partir del 7º miembro se perdían enteros. Síntoma visible: tras "Guardar equipo" cada peluquero aparecía con un único día (o ninguno) sin relación con lo que el usuario había marcado.
- Capturado el índice del miembro como `{% set midx = loop.index0 %}` en el loop externo y usado en el `name` del checkbox dentro del loop interno de días.
- Añadida una clase `dia-checkbox` y un handler `submit` en JS que renumera los `name="dias_trabajo_{i}"` según el orden DOM actual de los miembros, para cubrir el caso de "Añadir miembro" + "Quitar miembro" (que dejaba huecos en la numeración y desincronizaba el `enumerate` del backend).

---

## 2026-04-28 (portal — editor de horario de apertura del negocio)

El "Horario de apertura" que aparecía en `/app → Ajustes → Negocio` estaba **hardcodeado** en el JSX y no era editable: mostraba `Lun-Vie 09:30-20:30, Sáb 10-14, Dom cerrado` aunque el negocio del cliente tuviera otro horario distinto. La capa modelo (`Tenant.business_hours`) y la lógica de intersección con los turnos del miembro ya existían — el agente las usa al sugerir huecos —, simplemente faltaba exponer el editor en el portal.

### Añadido

- **`PATCH /api/portal/negocio/horarios`**: acepta `{"horarios": {"mon": [...], ...}}`, lo normaliza (admite tanto lista plana `["09:00","13:00","17:00","20:00"]` como lista de pares `[["09:00","13:00"],["17:00","20:00"]]`), valida HH:MM y rangos crecientes, y guarda en `Tenant.business_hours`. Las franjas inválidas o con `open >= close` se descartan; un día sin franjas válidas queda como `["closed"]`.
- **`GET /api/portal/negocio/horarios`**: devuelve `{"horarios": <dict>}` con el estado actual.
- **`GET /api/portal/negocio`** y el payload inicial de `/app` incluyen ahora `horarios`. La UI lo hidrata sin necesidad de un fetch adicional al cargar la pestaña.
- **UI editor in-line en `screen_ajustes.jsx`** (componente `HorariosNegocio`): toggle por día, franjas (apertura / cierre) con `<input type="time">`, botón `+ Añadir franja` (soporta turnos partidos), botón ✕ por franja, "Guardar horario". Si el tenant arranca sin `business_hours` configurado, se siembra L-V 09:00-18:00 para no presentar un lienzo en blanco.

### Cambiado

- Texto bajo el editor: "Cada miembro define sus turnos dentro de este horario en la pestaña **Equipo**. El bot nunca ofrecerá citas fuera de la apertura del negocio." — refleja la regla real (intersección negocio ∩ miembro) que ya implementaba `agent.py` + `calendar_service._ranges_for_day`.

### Notas

- No cambia la lógica del agente. La intersección de capas ya estaba: `business_hours` del tenant define el máximo, los `turnos` del miembro acotan dentro de ese máximo, `dias_trabajo` filtra los días.
- Tests sanity con `TestClient`: GET inicial OK, PATCH con lista plana / con pares / con franja invertida → todos normalizan correctamente. Payload inicial y GET /negocio incluyen `horarios`.

## 2026-04-28 (onboarding — sync CMS → Google Sheets y form de alta del cliente)

Se montó el flujo de onboarding del cliente extremo a extremo: form de Google con datos mínimos, Sheet vinculado, generación automática de un Doc por respuesta, y sincronización en tiempo real CMS → Sheet (pestaña "Tenants") para que cada cambio en `/admin/clientes/*` se vea reflejado sin pasos manuales.

### Añadido

- **`app/sheets_sync.py`**: módulo de sync unidireccional CMS → Google Sheets. Hookea `before_flush` y `after_commit` de SQLAlchemy; cada commit que toque `tenants`, `services` o `equipo` dispara un push del tenant afectado a la pestaña "Tenants". Pushes en `ThreadPoolExecutor` para no bloquear la respuesta del CMS. API pública: `push_tenant`, `delete_tenant`, `push_all_tenants`, `register_listeners`.
- **`scripts/crear_form_onboarding.gs`**: Apps Script que crea (1) un Form de onboarding express (~5 min de relleno, mayoría botones / matriz de horarios), (2) un Sheet vinculado con dos pestañas — "Respuestas" del Form y "Tenants" lista para que el backend escriba —, (3) carpeta de Drive, (4) trigger `onFormSubmit` que genera un Google Doc por cliente con secciones (Negocio, Horario, Servicios, Equipo, Personalización, Telefonía) y un bloque "Próximos pasos (interno)".
- **`SHEETS_SYNC_SETUP.md`**: guía paso a paso para crear el Service Account en GCP, compartir el Sheet, subir env vars a Railway, y verificar que el sync funciona.
- **`CHECKLIST_ONBOARDING_CLIENTE.md`**: lista de información a pedir al cliente antes de arrancar (versión interna con notas y plantilla limpia para el cliente).

### Cambiado

- **`app/main.py`**: nuevo `on_event("startup")` `_register_sheets_sync()` que llama a `sheets_sync.register_listeners()`. Si las env vars no están, los listeners siguen registrados pero el sync queda en no-op silencioso.
- **`requirements.txt`**: añadida dependencia `gspread==6.1.4` (autenticación con Service Account vía `google-auth` ya existente).

### Env / despliegue

- **Nuevas env vars**: `GOOGLE_SHEETS_ID` (parte larga del URL del Sheet) y `GOOGLE_SERVICE_ACCOUNT_JSON` (JSON entero del Service Account). Documentadas en `.env.example` con instrucciones. Ambas opcionales: si faltan, la app arranca igual y el sync queda inactivo.
- Setup completo (Service Account, permisos, Sheet) en `SHEETS_SYNC_SETUP.md`.

### Why

Tener tenants vivos solo en SQLite + CMS bloquea visibilidad para perfiles no técnicos. El Sheet sincronizado da una vista compartible, filtrable y exportable del estado real sin abrir Railway. El Form + Doc por cliente cierra el embudo de onboarding: lo que rellena el cliente queda como expediente buscable en Drive.

---

## 2026-04-28 (voz — Ana como plantilla maestra para tenants nuevos)

Hallazgo durante refresh de contexto: `app/db.py::render_voice_prompt` (la función que genera el prompt al dar de alta un tenant nuevo desde el CMS) tenía la **jerarquía vieja** del flujo RESERVA: `servicio → cuándo → NOMBRE → consultar → ofrecer → elegir → crear`. Es la regresión que se cazó en la ronda 8 sobre `ana_prompt_new.txt` y que `PROMPT_KNOWLEDGE.md` prohíbe explícitamente. Resultado: cualquier tenant nuevo nacía con la jerarquía equivocada (Ana pelu_demo no estaba afectada porque su `voice_prompt` ya estaba editado en BD).

### Cambiado

- **`render_voice_prompt(tenant)` ahora parte de `ana_prompt_new.txt`** como plantilla maestra. Carga el archivo del repo y sustituye sólo los datos del negocio (nombre, asistente, horario, servicios, peluqueros, timezone, fallback hablado, pregunta-corte). El resto del prompt — REFRESH_BLOCK de fechas, "UNA pregunta por turno", flujo RESERVA con nombre al FINAL, MOVER/CANCELAR con búsqueda por nombre, "Cierre y colgar" con `end_call` — queda **idéntico al de Ana, palabra por palabra**. Una sola fuente de verdad.
- La sustitución se hace por **anchors de línea exactos** definidos como constantes `_ANCHOR_*` en `app/db.py`. Si la plantilla se edita y un anchor deja de matchear, se levanta `RuntimeError` explícito en vez de devolver un prompt malformado silenciosamente.
- `ana_prompt_new.txt` no se modifica — sigue siendo el prompt vivo de Ana y `scripts/refresh_agent_prompt.py` / `scripts/setup_elevenlabs_agent.py` lo consumen como antes.

### Añadido

- `tests/test_render_voice_prompt.py` (13 tests): regresión sobre la jerarquía y secciones canónicas. Falla si reaparecen "nombre antes de consultar" o desaparece alguna marca crítica (REFRESH_BLOCK, "UNA pregunta por turno", "Cierre y colgar", `end_call`, búsqueda por `nombre_cliente`, etc.). Cubre dos fixtures: peluquería con equipo y abogado sin equipo.
- Test de degradación segura: si la plantilla cambia y los anchors dejan de matchear, `render_voice_prompt` levanta `RuntimeError` con la lista de anchors faltantes.

### Why

Cualquier mejora futura sobre `ana_prompt_new.txt` se hereda automáticamente a todos los tenants nuevos. Y la jerarquía optimizada (nombre al FINAL) deja de poder regresar accidentalmente para clientes nuevos.

---

## 2026-04-28 (voz — guardrails de saludo, tenant propio y deploy de fixes)

Se cerró la tanda de hardening del canal de voz tras una llamada real con saludo ofensivo y varios roces de UX. Además, `pelu_demo` dejó de depender del agente global de entorno y pasó a tener `voice_agent_id` propio en producción.

### Corregido

- **Saludo ofensivo eliminado**: el `first_message` del agente remoto quedó fijado a `Hola, soy Ana de la peluquería. ¿En qué te puedo ayudar?` para evitar saludos creativos o tóxicos editados desde la UI de ElevenLabs.
- **"sin preferencia" vuelve a funcionar** en `consultar_disponibilidad` y `crear_reserva`: el backend ya normaliza variantes (`sin preferencia`, vacío, `me da igual`, `cualquiera`) y no las trata como nombre de peluquero inexistente.
- **Healthcheck de voz más fiel al estado real**: `/_diag/elevenlabs/healthcheck` y `/_diag/tenant/voice` ahora reportan prompt efectivo, drift y origen del `agent_id`; además se arregló un `DetachedInstanceError` al inspeccionar tenants fuera de sesión SQLAlchemy.
- **Prompt de voz regenerable y sincronizable** desde CMS/diag: se añadió flujo para regenerar el prompt desde datos del tenant y empujarlo a ElevenLabs sin editarlo a mano.

### Cambiado

- **Prompt de `pelu_demo` endurecido**: añade regla explícita de no insultar / no repetir tacos del cliente, evita diminutivos raros, reduce repeticiones del nombre y mejora el lenguaje al confirmar, mover o cancelar.
- **Prompt comprimido** de ~4.4 KB a ~3.2 KB para rascar algo de latencia de prefill.
- **`max_tokens` por defecto baja de 300 a 220** en creación/sincronización de agentes para recortar divagaciones y tiempo de respuesta.
- **Creación de agentes nuevos** (`create_agent_for_tenant` y `scripts/setup_elevenlabs_agent.py`) nace ya con saludo seguro y el cap de 220 tokens.
- **`pelu_demo` usa agente propio** en producción (`voice_agent_id` guardado en BD) en vez de heredar `ELEVENLABS_AGENT_ID` global. Así los cambios del tenant quedan aislados y no contaminan otros bots.

### Deploy / verificación

- Push remoto de los fixes backend/diag/voz.
- Redeploy manual en Railway y verificación post-deploy:
  - `/_diag/tenant/voice` OK
  - `/_diag/elevenlabs/healthcheck` OK
  - smoke test de `consultar_disponibilidad` con `peluquero_preferido="sin preferencia"` OK
- Regeneración y sincronización del prompt en `pelu_demo` y `test_mario`.

## 2026-04-24 (ronda 9 hotfix — paginación + filtro por nombre)

Tras subir la búsqueda por nombre en la ronda 9, Marcos probó con una cita real (`"Mario — Corte hombre (Mario)"` del lunes 27 a las 12:30) y el endpoint respondió `encontrada:false` aunque el evento existe. Dos fixes consecutivos:

### Corregido

- **Filtro demasiado laxo**: la primera versión matcheaba cualquier ocurrencia del nombre en el summary, de modo que buscar `"Mario"` devolvía citas como `"Eva Test — Corte (con Mario)"` donde Mario es el peluquero, no el cliente. Endurecido a dos criterios estrictos:
  - **Match A**: `extendedProperties.private.client_name` coincide (exacto o substring bidireccional).
  - **Match B**: `summary` empieza por `"<nombre> —"` (convención del título canónico "Nombre — Servicio (con Peluquero)").
  Si ninguno matchea, `encontrada:false` — mejor vacío que falso positivo.

- **maxResults=20 cortaba la respuesta antes del evento real**: el calendario de `pelu_demo` tiene decenas de citas donde "Mario" aparece como peluquero en `(con Mario)`; `events.list?q=Mario` devolvía 27+ resultados y el evento real estaba hacia el final. Ahora **paginamos hasta 5 páginas × 100 resultados (500 eventos máx)** con `pageToken`. Cubre >2 meses de agenda densa.

Verificado contra producción:
- `"Mario"` → `Mario — Corte hombre (Mario)` del lunes 27 a las 12:30 ✓
- `"Eva"` → `Eva Test — Corte hombre (con Mario)` ✓
- `"Marcos"` → cita del cliente Marcos (no del peluquero) ✓
- Falsos positivos del peluquero Mario → descartados ✓

### Notas

- `scripts/setup_elevenlabs_agent.py` y `app/elevenlabs_client.create_agent_for_tenant` declaran los `dynamic_variable_placeholders` por defecto al crear un agente. Tenants nuevos nacen con el schema correcto y no caen en el bug.

---

## 2026-04-24 (ronda 9 — búsqueda por nombre, soft_timeout y end_call)

Tres fallos de UX observados en llamadas reales; corregidos los tres.

### Corregido

- **Ana no podía buscar una cita por nombre** cuando el cliente decía "está a nombre de Mario" o llamaba desde otro número. `buscar_reserva_cliente` solo aceptaba `telefono_cliente` → Ana quedaba bloqueada ("el sistema solo me deja buscar por teléfono"). Ahora la tool acepta `nombre_cliente` opcional y el backend usa `events.list?q=<nombre>` de Google Calendar, filtrando por `summary` y `extendedProperties.private.client_name` para evitar falsos positivos. Nuevo helper `cal.buscar_evento_por_nombre` en `app/calendar_service.py`. El handler `/tools/buscar_reserva_cliente` intenta primero por teléfono (body o caller_id) y si no encuentra, prueba por nombre; devuelve `via_busqueda: "telefono"` o `"nombre"` para que Ana sepa confirmarlo antes de mover/cancelar.

- **"¿Sigues ahí?" se disparaba casi inmediatamente**. `turn.soft_timeout_config.timeout_seconds` estaba en `-1.0` (desactivado) pero el `turn_timeout` de 1s hacía que Ana retomara el turno casi al instante. Ahora `soft_timeout_config = {timeout_seconds: 3.5, use_llm_generated_message: true, message: "¿Sigues ahí?"}`. Espera 3.5s de silencio y entonces Ana improvisa un "¿sigues ahí, Juan?" natural (no el literal fijo).

- **Llamada no colgaba al terminar**. `silence_end_call_timeout` estaba en `-1.0` y `built_in_tools.end_call` estaba en `null`. Ahora:
  - `silence_end_call_timeout: 25.0` → si tras el "¿sigues ahí?" pasan otros ~25s sin respuesta, la llamada se cierra sola.
  - `end_call` habilitado como built-in tool con una descripción que indica cuándo usarla: tras cierre natural, tras confirmar reserva sin nada más, o tras derivar al fallback.
  - Prompt `ana_prompt_new.txt` añadida sección `## Cierre y colgar` que le dice a Ana que tras su última frase de despedida llame a `end_call`. Verificado: el bench muestra `tools=['consultar_disponibilidad', 'crear_reserva', 'end_call']` al final de un flujo de reserva completo.

### Añadido / Cambiado

- `app/calendar_service.py::buscar_evento_por_nombre(nombre, desde, hasta, ...)`: usa `events.list?q=<nombre>` con `maxResults=10` y filtra por `summary`/`client_name` para evitar matches falsos.
- `app/eleven_tools.py`: `BuscarReq` tiene `nombre_cliente: str | None = None`. El handler busca por teléfono, si no encuentra prueba por nombre, devuelve `via_busqueda` distinguiendo origen. Mensaje de error graceful si fallan los dos.
- `app/elevenlabs_client.create_agent_for_tenant` y `scripts/setup_elevenlabs_agent.py` aplican `soft_timeout_config`, `silence_end_call_timeout: 25`, `built_in_tools.end_call` y el schema nuevo de `buscar_reserva_cliente` por defecto. Cualquier bot nuevo nace con esto.
- `ana_prompt_new.txt`: nueva sección `## Flujo MOVER / CANCELAR — si no encuentras por teléfono` para instruir explícitamente que pregunte el nombre tras un fallo de búsqueda; sección `## Cierre y colgar` con la regla de llamar a `end_call`.
- Snapshot: `docs/elevenlabs_agent_snapshot_post_round9_*.json`.

### Tests

- Suite backend: 106/106 verdes.
- `scripts/test_dialog.py` en `reserva_sin_peluquero`: **7/7 checks OK**. Detecta `end_call` al final del flujo como tool válida adicional.

---

## 2026-04-24 (docs — consolidar knowledge del prompt)

### Añadido

- **`PROMPT_KNOWLEDGE.md`**: documento maestro con todo lo aprendido sobre el prompt de voz de Ana y su mantenimiento. Contenido:
  - Principios inalterables (flujo RESERVA canónico, UNA pregunta por turno, reglas duras). Política de "no tocar sin permiso" + cambios permitidos sin permiso.
  - 6 gotchas descubiertos con diagnóstico y solución (Gemini 3 ignora `{{system__time}}`, `dynamic_variable_placeholders` obligatorios, `pre_tool_speech` es enum, `simulate-conversation` no ejecuta tools, Gemini 3 encadena preguntas sin ejemplos explícitos, del hijoputa en el first_message).
  - Proceso de mantenimiento paso a paso: editar prompt → refresh → test → commit. Incluye cron diario recomendado.
  - Cómo añadir un escenario/check al harness, cómo añadir una dynamic_variable nueva.
  - Tabla de los ~13 modelos LLM evaluados con criterio de sustitución.
  - Checklist pre-push (7 items).
  - Regla de oro: si no hay permiso explícito, no tocar.

### Cambiado

- **`CLAUDE.md`, `README.md`, `BOT_NUEVO_CONFIG.md`** enlazan a `PROMPT_KNOWLEDGE.md` como punto de entrada para cualquier edición del prompt de voz. `BOT_NUEVO_CONFIG.md` redirige el detalle del prompt ahí (una sola fuente de verdad).

---

## 2026-04-24 (ronda 8 — restaurar jerarquía del prompt + test automatizado)

Bug de producto: al recortar el prompt en la ronda 7, moví **"nombre al FINAL antes de crear_reserva"** a **"nombre antes de consultar"**, eliminé la repetición enfática de **"UNA pregunta por turno"** y suprimí la sección de fillers. Marcos cazó la regresión en una llamada real ("te pregunta 27 cosas, habíamos establecido una jerarquía"). Corregido.

### Corregido

- **Prompt `ana_prompt_new.txt` restaurado a la jerarquía original** (5 KB): `servicio → cuándo → consultar → ofrecer → elegir → NOMBRE → crear`. Nombre al FINAL, justo antes de `crear_reserva`, no antes. Incluye EJEMPLO DE TURNOS BIEN ORDENADOS + ejemplos explícitos de MAL (encadenar dos preguntas en un turno) para que el LLM no se desvíe. Sección `## Estilo` pura + sección `## UNA pregunta por turno (regla crítica)` separada.
- **Bug de año de las fechas**: Gemini 3 Flash Preview ignora `{{system__time}}` del contexto y usa su training cutoff → enviaba fechas de 2025 cuando estábamos en 2026 → huecos=[] → Ana alucinaba horas. **Nuevo `scripts/refresh_agent_prompt.py`** que renderiza el bloque `<!-- REFRESH_BLOCK -->` con macros `__HOY_FECHA__`, `__MANANA_FECHA__`, `__ANO_ACTUAL__`, etc. como **texto literal** antes de sincronizar el prompt. Ya no depende de la variable — la fecha queda hardcodeada en el prompt subido. Ejecutar al menos 1x al día (idealmente cron).

### Añadido

- **`scripts/test_dialog.py`**: harness de tests de flujo contra el agente real vía `/v1/convai/agents/{id}/simulate-conversation`. Valida 7 checks por escenario:
  1. `orden_tools_correcto` — `consultar_disponibilidad` antes de `crear_reserva`, etc.
  2. `nombre_al_final` — primera pregunta de nombre después del primer `consultar_disponibilidad`.
  3. `una_pregunta_por_turno` — 0 ó 1 interrogación por turno de agente (ignora muletillas).
  4. `año_correcto` — todas las fechas ISO con año actual.
  5. `peluquero_vacio` — `peluquero_preferido` vacío cuando el user no lo menciona.
  6. `telefono_no_none` — en `crear_reserva`, `telefono_cliente` no es literal "None".
  7. `no_alucina_huecos` — si el backend devuelve `huecos=[]`, Ana no propone horas (SKIP en sim porque `simulate-conversation` no ejecuta tools realmente).
  4 escenarios (reserva_sin_peluquero, reserva_con_peluquero, mover_cita, cancelar_cita). Resultado tras fix: **3/4 escenarios ALL GREEN (7/7 checks)**. `mover_cita` falla con 500 del simulator de ElevenLabs (bug del simulator, no del prompt — en llamadas reales la tool sí devuelve event_id).

- **`scripts/refresh_agent_prompt.py`**: renderiza fechas reales en el prompt y sincroniza. Idempotente, ejecutable vía cron.

### Cambiado

- **LLM vuelve a `gemini-3-flash-preview`** con prompt reforzado. Gemini 2.5 Flash era más obediente pero 3x más lento. El refuerzo con ejemplos explícitos hace que 3-flash-preview siga el flujo (verificado en los 7 checks de 3/4 escenarios).
- **`ana_prompt_new.txt`**: nueva sección `## ATENCIÓN — FECHA ACTUAL` al principio con bloque `<!-- REFRESH_BLOCK -->` que `refresh_agent_prompt.py` reemplaza por fecha literal.

### Política

- **No volver a tocar la jerarquía del prompt de Ana sin permiso explícito de Marcos.** Se ha añadido feedback a la memoria personal (`feedback_prompt_ana_no_tocar.md`) para que futuras sesiones lo tengan presente.

---

## 2026-04-24 (ronda 7 — hotfix fechas alucinadas)

Bug crítico descubierto al probar el bot con una llamada real: Ana alucinaba fechas de **mayo 2025** cuando hoy era abril 2026, creaba la cita pero en el año pasado, y respondía "no hay huecos" en cuanto el cliente mencionaba cualquier día.

### Corregido

- **Placeholders de dynamic_variables no estaban declarados**. ElevenLabs **ignora** lo que devuelve el personalization webhook si las keys custom NO están pre-registradas como `conversation_config.agent.dynamic_variables.dynamic_variable_placeholders`. Sin esto, el prompt veía literal `{{manana_fecha_iso}}` y el LLM improvisaba. Se han declarado las 11 keys (`hoy_fecha_iso`, `manana_fecha_iso`, `pasado_fecha_iso`, `hoy_dia_semana`, `manana_dia_semana`, `hoy_natural`, `manana_natural`, `hora_local`, `caller_id_legible`, `tenant_id`, `tenant_name`) en el agente remoto `pelu_demo` vía PATCH.
- **Prompt revertido a usar `{{system__time}}` (variable del sistema, siempre inyectada)** como fuente primaria de fecha, con regla 11 explícita "el año de las fechas ISO SIEMPRE coincide con el año de {{system__time}}". Así el bot funciona con o sin webhook; las custom dynamic_variables son ahora una mejora (tokens ahorrados), no requisito.
- **Evento fantasma creado en 2025-05-20 12:30 borrado** (`event_id=8bh7rp74o477sum6cuuj9govb8` en el calendario principal del tenant). Diagnosticado via `GET /v1/convai/conversations/{id}` que mostró args de tool_calls con fechas de mayo 2025.

### Cambiado

- **`scripts/setup_elevenlabs_agent.py`** y **`app/elevenlabs_client.create_agent_for_tenant`** declaran los `dynamic_variable_placeholders` por defecto al crear un agente. Tenants nuevos nacen con esto resuelto.
- **`BOT_NUEVO_CONFIG.md`**: nueva sección "Placeholders de dynamic_variables (OBLIGATORIO)" con el gotcha y la lista completa. Mantiene el checklist alineado.
- **`ana_prompt_new.txt`**: usa `{{system__time}}` en lugar de `{{manana_fecha_iso}}` etc. Incluye regla dura sobre año.

### Notas

- El personalization webhook sigue desplegado y funcional (`/tools/eleven/personalization` responde 200 con las variables correctas). Con los placeholders declarados ahora ElevenLabs debería inyectarlas en la próxima llamada real via Twilio. En WS text-only el webhook puede saltarse porque el cliente envía su propio `conversation_initiation_client_data` en el primer frame — verificación real requiere llamada inbound Twilio.
- Snapshot post-fix: `docs/elevenlabs_agent_snapshot_post_round7_hotfix_2026-04-24T181207Z.json`.

---

## 2026-04-24 (latencia — ronda 7)

Ajustes finos + recorte de prompt + personalization endpoint + prefetch especulativo. Exploración exhaustiva de las palancas que quedaban tras la ronda 6.

### Añadido

- **`/tools/eleven/personalization`** (`app/eleven_tools.py`): webhook `conversation_initiation_client_data_webhook`. ElevenLabs lo llama UNA vez al inicio de cada conversación y recibe `dynamic_variables` precomputadas: `hoy_fecha_iso`, `manana_fecha_iso`, `pasado_fecha_iso`, `hoy_dia_semana`, `manana_dia_semana`, `hoy_natural` ("viernes 25 de abril"), `manana_natural`, `hora_local`, `caller_id_legible`, `tenant_id`, `tenant_name`. El prompt ahora usa `{{hoy_natural}}` / `{{manana_natural}}` en lugar de `{{system__time_utc}}` → Gemini ya no calcula weekday desde UTC, ahorra tokens de prefill y elimina el bug histórico de "mañana el jueves" / "pasado mañana el viernes".

- **Prefetch especulativo de freebusy** dentro de `personalization`: tras responder las dynamic_variables, dispara un `asyncio.create_task` que precalienta `_FREEBUSY_CACHE` para hoy+2 días con duraciones 30 y 45 min. Cuando Ana llama a `consultar_disponibilidad` 2-5s después, el cache está caliente → tool devuelve en <50ms en vez de 500-900ms. Fire-and-forget, no bloquea la respuesta del webhook. **Ganancia estimada ~400-800ms en TT_final en llamadas reales.**

- **Snapshots**: `docs/elevenlabs_agent_snapshot_post_round7_*.json` + `elevenlabs_agent_config.json` al estado final.

### Cambiado

- **Prompt recortado de ~4,6 KB a ~3,3 KB (-28%)** (`ana_prompt_new.txt`): eliminada sección "Fillers antes de tool calls" (redundante con `pre_tool_speech: force` de ronda 5), consolidadas "Reglas duras" 1-10 en una lista compacta, comprimido el paso 6 de "Flujo RESERVA", colapsado "Fechas al hablar" en un párrafo. Tool-calling sigue 4/4 correcto. TTFR medio bajó de ~1258ms a ~1208ms tras el recorte (-50ms).

- **Ajustes finos de turn-taking y backup LLM**:
  - `backup_llm_config.preference`: `default` → `disabled`. Libera el cascade de 4s y hace el camino hot más predecible.
  - `turn.spelling_patience`: `auto` → `off`. El agente no espera a que el user deletree cosas.
  - `tts.text_normalisation_type`: `system_prompt` → `elevenlabs`. Normalización server-side (más rápida que vía prompt).

- **`conversation_initiation_client_data_webhook`** registrado en `platform_settings.workspace_overrides` apuntando a Railway + `overrides.enable_conversation_initiation_client_data_from_webhook: true`.

### Evaluado y rechazado en esta ronda

- **`gemini-3-pro-preview`**: 7-10s TTFR y **cero tool calls** en los dos escenarios probados. Descartado.
- **`gemini-3.1-flash-lite-preview`**: 4/4 tools OK pero varianza 854-2170ms TTFR (empate estadístico con `gemini-3-flash-preview` pero con más ruido). Mantenemos el ganador de ronda 6.
- **Asyncificar cliente Google Calendar (HTTP/2)**: ganancia real 50-100ms por tool call pero trade-off desfavorable — el cache freebusy 8s + el prefetch ya llevan el primer call a <50ms en la llamada real. Se queda como ronda 8 estratégica si aparece un caso de cold cache frecuente.

### Notas

- Los valores aceptados por la API de ElevenLabs descubiertos en esta ronda (para futuras referencias):
  - `turn.spelling_patience`: `auto` | `off`.
  - `turn.turn_model`: `turn_v2` | `turn_v3`.
  - `turn.initial_wait_time`: `-1` (default, espera infinita) o `>=1` segundo. Valores <1 rechazados.
  - `tts.text_normalisation_type`: `system_prompt` | `elevenlabs`.
  - `agent.prompt.backup_llm_config.preference`: `default` | `disabled` | `override`.
  - `tool.pre_tool_speech`: `auto` | `force` | `off` (ya documentado en ronda 5 hotfix).

- Bench WS text-only no puede medir la ganancia del prefetch porque el bench no dispara `conversation_initiation_client_data_webhook` (eso ocurre solo en llamadas reales de voz). La ganancia se verá en la primera `consultar_disponibilidad` real tras una llamada.

- **Objetivo <400ms end-to-end sigue sin alcanzarse** con esta stack. TTFR mínimo medido: ~1035ms. Mínimo teórico con LLM-as-a-service + ElevenLabs + webhook: ~800-1100ms. Bajar de ahí requiere custom LLM endpoint (Groq/Cerebras) o eliminar el round-trip webhook.

- Suite de tests: **106/106 verdes** tras todos los cambios.

---

## 2026-04-24 (latencia — ronda 6)

Migración del LLM del agente de voz de `gemini-2.5-flash` a `gemini-3-flash-preview`, más `turn_v3` en turn-taking. La mayor ganancia de latencia medida hasta la fecha.

### Cambiado

- **`llm: gemini-2.5-flash` → `gemini-3-flash-preview`** en el agente `pelu_demo`. Bench con WebSocket text-only contra el agente real:

  | Modelo | TTFR (primer texto post user_msg) | TT_tool_response | TT_final (respuesta útil post-tool) | Tools OK |
  |--------|-----|-----|-----|-----|
  | **gemini-3-flash-preview** (nuevo) | **1062-1340ms** | 1867-2056ms | **2622-3944ms** | **4/4 ✓** |
  | gemini-2.5-flash (antes) | 1803-6940ms | 2770-7871ms | 3900-10410ms | ✓ |
  | gpt-oss-120b | 910-9134ms (alta varianza) | 1167-9567ms | 1615-10405ms | ✓ (experimental) |
  | watt-tool-70b | ~6400ms | ~7000ms | ~12400ms | ✓ (muy lento) |
  | qwen3-30b-a3b | 319ms | — | — | ✗ NO llama a tools |
  | glm-45-air-fp8 | 557ms | — | — | ✗ **alucina** reservas |
  | gemini-2.5-flash-lite | 1061ms | — | — | ✗ NO llama a tools |

  Con `pre_tool_speech: force` activo (desde ronda 5 hotfix), el TTFR es lo que oye el usuario antes del filler "vale, te miro un momento..." — bajamos de ~4500ms a ~1200ms. Para la respuesta útil post-tool (los huecos que Ana dicta), de ~7500ms medio a ~3000ms medio. **Mejora percibida: ~3x más rápido al inicio del turno, ~2.5-3x al resultado.**

- **`turn_model: turn_v2` → `turn_v3`** en `conversation_config.turn`. v3 es más rápido detectando fin de turno del usuario (propiedad interna de ElevenLabs — no hay docs públicos, pero el PATCH lo acepta y los bench posteriores siguen consistentes).

- **`scripts/setup_elevenlabs_agent.py`**: tenants NUEVOS nacen con `llm: gemini-3-flash-preview`, `temperature: 0.3`, `max_tokens: 300`, `thinking_budget: 0`, `turn_model: turn_v3`, `turn_timeout: 1.0`, `speculative_turn: true`. Antes el script no fijaba explícitamente `llm` ni `turn_*` (heredaba defaults).

### Añadido

- **`scripts/bench_llm.py`** (orquestador) y **`scripts/bench_one.py`** (runner por modelo × escenario): harness contra `/v1/convai/agents/{id}/simulate-conversation` que valida tool-calling y mide TTFB. Útil para futuras rondas cuando aparezcan modelos nuevos.
- **`scripts/bench_ws.py`**: harness WebSocket text-only para medir TTFR, TT_tool_response y TT_final con un mensaje real, captando `agent_response` + `agent_tool_response`. Mucho más rápido que `simulate-conversation` (~6-8s por test vs 35-40s). Ideal para iterar.
- **`docs/elevenlabs_agent_snapshot_pre_round6_*.json`** y **`docs/elevenlabs_agent_snapshot_post_round6_*.json`**: snapshots pre/post migración (secrets redacted, prompt externalizado).
- **`elevenlabs_agent_config.json`** actualizado al estado post-round6.
- **`ELEVENLABS.md`** con sección "Modelos descartados en el bench de ronda 6 (guía anti-regresión)" para no repetir pruebas inútiles.

### Notas de diseño

- El objetivo de `<400ms end-of-speech → primer audio` que pedía Marcos NO se alcanza con esta stack: el LLM más rápido con tools fiables da ~1100ms TTFR, y aún hay que sumar ASR (~150-300ms) y TTS primer audio (~150-200ms). Realidad: **~1400-1700ms end-to-end para el primer audio** (el filler). Y ~3000-3500ms para la información útil (huecos reales).

  Para bajar de ahí hace falta cambiar arquitectura (custom LLM endpoint en Groq/Cerebras con Llama 3.3 70B, modelos edge, o cache de respuestas frecuentes). Queda como ronda 7 estratégica si el nivel actual no basta.

- `gemini-3-flash-preview` lleva el sufijo "preview" — si Google lo deprecata o lo renombra, hay que migrar a su sucesor. La versión "GA" equivalente cuando exista será el siguiente paso.

- `turn_v3` aplicado sin tests A/B prolongados. Observación subjetiva en el bench: tiempos consistentes con `turn_v2`. Si surge regresión (cortes prematuros, agente que interrumpe), rollback con un PATCH a `turn_v2`.

### Breaking

- Ninguno visible al usuario final. Cambios son en la config remota del agente ElevenLabs; el backend sigue igual.

---

## 2026-04-24 (latencia — ronda 5 hotfix)

### Corregido

- **`force_pre_tool_speech` no se aplicaba vía el flag booleano suelto.** Al ejecutar `scripts/migrate_agent_latency.py` contra el agente remoto de `pelu_demo` se observó que el PATCH respondía 200 pero las 5 tools seguían con `force_pre_tool_speech=false`. El campo real que controla el comportamiento es el enum `pre_tool_speech: 'auto' | 'force' | 'off'`; solo con `'force'` se activa. Además, las tools NO se editan vía `PATCH /v1/convai/agents/{id}` — son entidades independientes con su propio `tool_id`, hay que patchearlas en `/v1/convai/tools/{tool_id}`.
- `app/elevenlabs_client._build_tools` emite ahora `pre_tool_speech: "force"` además del booleano, para que los tenants creados desde el CMS nazcan con el TTS del filler paralelizado.
- `scripts/migrate_agent_latency.py` refactorizado: (a) PATCH agente solo para TTS, (b) iteración por tool_id con PATCH `{tool_config: {...}}` para `pre_tool_speech='force'` + `calendar_id` en schemas. Verificado en vivo contra `pelu_demo`: las 5 tools quedan con `pre_tool_speech=force`, `force_pre_tool_speech=True`.

### Notas

- Esta entrada complementa al commit `e557dcb` que se pusheó fuera de la convención (sin tocar CHANGELOG). La convención pide tocar CHANGELOG antes de cada push; este hotfix lo arregla retroactivamente.

---

## 2026-04-24 (latencia — ronda 5)

Quinta ronda de optimización de latencia del canal voz. Las 4 anteriores recortaron lo obvio (cache del cliente Google, freebusy 8s, prompt 7KB→4,5KB, `thinking_budget:0`, `turn_timeout:1s`, `optimize_streaming_latency:4`, `ulaw_8000`, `tool_call_sound:typing`, `cascade_timeout:4s`, `max_tokens:300`, flujo RESERVA reordenado). Esta ronda ataca el siguiente escalón: caché de tenant, idempotencia, fast path de mover/cancelar, warm-up de Google y TTS flash.

### Añadido

- **Middleware de timing en `/tools/*` y `/_diag/*`** en `app/main.py`: log `timing path=... tenant=... status=... dur_ms=...` y header `X-Backend-Duration-MS` en cada respuesta. Base para medir el impacto real de las palancas que vienen detrás.
- **Caché in-memory del tenant en `app/tenants.py`** (TTL 30s, clave por `tenant_id`), con invalidación automática vía listener `before_commit`/`after_commit` de SQLAlchemy cuando se escribe un `Tenant`, `Service` o `MiembroEquipo`. Ahorra ~10-30ms por tool call en caché caliente. Incluye helper `invalidate_tenant_cache(tid|None)` para casos manuales.
- **`Tenant.to_dict(include_system_prompt: bool = True)`** en `app/db.py`: el hot path de voz NO usa `system_prompt` (usa `voice.prompt`) — `eleven_tools._resolve_tenant` ahora pide la versión ligera y se ahorra ~1-3ms de render por llamada.
- **Fast path en `/tools/mover_reserva` y `/tools/cancelar_reserva`**: aceptan `calendar_id` opcional en el body. Si el agente lo reenvía (lo devuelve `buscar_reserva_cliente`), el backend hace un único PATCH/DELETE sin iterar peluqueros. Ahorra 200-1500ms en tenants con varios calendarios. Schemas remotos actualizados en `elevenlabs_client._build_tools` y `scripts/setup_elevenlabs_agent.py`.
- **Idempotencia en `/tools/crear_reserva`**: antes de insertar, busca un evento del mismo teléfono en ±5min; si existe, devuelve `ok:true, duplicate:true, event_id=<existente>`. Evita cita duplicada cuando ElevenLabs reintenta tras timeout de red (observado en el audit como H-3).
- **Warm-up de Google Calendar en startup** (`@app.on_event("startup")` en `app/main.py`): precalienta `_service(tid)` para tenants `contracted+active`, de modo que la primera tool call tras un redeploy no paga el coste (~200-400ms) de construir el cliente googleapiclient.
- **`force_pre_tool_speech: true`** por defecto en las 5 tools generadas por `elevenlabs_client._build_tools`. Arranca el TTS del filler en paralelo a la HTTP call. Palanca 4 documentada en memoria, ahora aplicada por defecto en agentes nuevos.
- **`scripts/migrate_agent_latency.py`**: script one-shot que patchea un agente existente en ElevenLabs a: (1) `tts.model_id = eleven_flash_v2_5`, (2) `force_pre_tool_speech: true` en las 5 tools, (3) `calendar_id` opcional en los schemas de mover/cancelar. Soporta `--dry-run`.
- **Tests nuevos**: `tests/test_eleven_tools_latency.py` con 8 tests (fast path con/sin `calendar_id`, idempotencia con/sin duplicado previo, caché de tenant sirve sin re-query, invalidación borra entrada, retry con backoff reintenta transitorios y aborta permanentes). `tests/conftest.py` aísla DB/tokens/env de los tests para que no toquen `data.db` real. Suite completa: **106 tests, 0 fallos**.
- **`AUDITORIA_2026-04-24.md`**: auditoría profunda previa (arquitectura, seguridad, fiabilidad, testing, observabilidad, latencia con presupuesto por tramo y plan priorizado). Documento de referencia en el workspace; no va al repo.

### Cambiado

- **`_retry_google` con backoff exponencial + jitter y cap** (`app/eleven_tools.py`): sustituye `time.sleep(0.8 * (i + 1))` lineal por `random.uniform(0, min(max, base * 2^i))` con `base=0.4s` y `max=1.5s`. Reduce la mediana del backoff y limita el peor caso. Sin cambio funcional en el caso nominal (0 reintentos).
- **`elevenlabs_client.sync_agent(...)`** acepta `model_id: str | None`: ahora se puede propagar el TTS model desde código (además de `prompt` y `voice`). Usado por `scripts/migrate_agent_latency.py` para migrar agentes ya creados.
- **`DEFAULT_TTS_MODEL_ID = "eleven_flash_v2_5"`** en `app/elevenlabs_client.py`: constante explícita para el TTS de baja latencia. `create_agent_for_tenant` ya la usaba; ahora queda centralizada.

### Corregido

- **TTS drift `eleven_v3_conversational` → `eleven_flash_v2_5`** en el agente remoto (pelu_demo). `ELEVENLABS.md` ya documentaba flash pero el agente vivo quedaba en v3 — más expresivo pero con 150-400ms extra al primer audio. El script `scripts/migrate_agent_latency.py` lo revierte. Requiere ejecución manual tras este deploy (ver abajo).

### Env / despliegue

- Sin variables de entorno nuevas. `TOOL_SECRET`, `ELEVENLABS_API_KEY`, `ELEVENLABS_AGENT_ID`, `DATABASE_URL`, `TOKENS_DIR` siguen igual.
- **Post-deploy manual (una vez)**: ejecutar `python scripts/migrate_agent_latency.py` contra Railway local o con `ELEVENLABS_API_KEY` en el entorno. Aplica: TTS flash + `force_pre_tool_speech` + `calendar_id` en schemas de mover/cancelar del agente remoto. Usar `--dry-run` antes de aplicar.
- El middleware de timing emite logs nuevos con prefijo `timing path=...`. Si se centralizan logs en Railway, crear una query/filtro por ese prefijo para ver p50/p95.

### Notas de diseño

- El caché de tenant tiene TTL intencionalmente corto (30s) + invalidación automática por listener. Si alguien escribe a la BD por fuera del CMS (p.ej. ejecutando SQL directo en el volumen de Railway), el caché tarda como mucho 30s en refrescarse. Aceptable.
- `force_pre_tool_speech: true` hace que ElevenLabs empiece a hablar el filler ("vale, te miro un momento...") ANTES de recibir el resultado de la tool. Si el backend responde súper rápido (caso cache hit freebusy), el filler suena un poco "de más"; pero si tarda 500ms+, enmascara la latencia auditivamente. Trade-off aceptado.
- Palancas no aplicadas en esta ronda: región EU en Railway (L5), HTTP/2 + async Google client (L8), LLM custom en Groq/Cerebras (L10), prefetch especulativo (L9). Ver `AUDITORIA_2026-04-24.md` § 4.3 para el roadmap.

---

## 2026-04-24 (parche pm 5)

### Corregido

- **Resumen de confirmación decía "con sin preferencia".** Caso real: *"Corte de hombre, sábado 25 a las 16:30 con sin preferencia, a nombre de Anabel Prueba. ¿Lo confirmo?"* — la composición automática `con {peluquero}` se rompía cuando `{peluquero}` era literalmente `"sin preferencia"`. Endurecida la description de `pedir_confirmacion`: estructura explícita, prohibición literal de `"con sin preferencia"` / `"con cualquiera"`, y ejemplo correcto sin peluquero (*"Corte mujer, sábado 25 a las 16:30. ¿Te lo confirmo?"*). Verificado en producción: Ana dice ahora *"Corte hombre, sábado 25 a las 19:00. ¿Te lo confirmo?"* cuando no hay preferencia.

### Tests

- Test de regresión en `test_prompt_confirmation_and_title.py` sobre la description del tool.
- 2 tests nuevos en `test_telegram.py` sobre el envío del .ics tras `handle_update`: verifica que cuando `AgentReply.calendar_event` está poblado, `handle_update` llama a `send_document` con el contenido iCal correcto y filename `cita-YYYYMMDD-HHMM.ics`; y que si no hay `calendar_event`, no se envía documento. Suite pasa a **97/97**.

---

## 2026-04-24 (parche pm 4)

### Corregido

- **Ana ofrecía huecos que ya habían pasado.** Caso real: Anabel preguntó a las 12:00 y el bot le propuso hueco a las 9:00 del mismo día. Añadido filtro `_descartar_huecos_pasados` / `_descartar_slots_pasados` en `app/eleven_tools.py` y filtro equivalente en `app/agent.py::_execute_tool(consultar_disponibilidad)`. Se descartan huecos cuyo `inicio < now + 10 min` (margen para no ofrecer algo inminente al que el cliente no llega físicamente). Se usa `_tz_now()` (timezone-aware en la TZ del tenant, por defecto Europe/Madrid) para evitar desfases con Railway corriendo en UTC.
- **Como consecuencia, Ana a veces no ponía botones de horas cuando el cliente pedía cita "hoy"**: recibía una lista contaminada con slots pasados que la confundía. Al filtrar, si quedan ≥1 huecos válidos llama a `ofrecer_huecos` (botones); si no queda ninguno, dice en texto que no hay disponibilidad y ofrece otra fecha.

### Añadido

- **Archivo `.ics` adjunto tras crear una reserva.** Petición del cliente: el enlace "Añadir a Google Calendar" lleva a Google Workspace (web) en vez de abrir la app nativa del teléfono. Solución: nueva función `_build_ics_content` (RFC 5545 válido, con `TZID`, escape de `, ; \ \n`, folding a 75 cols). El canal Telegram envía el .ics vía `sendDocument` con MIME `text/calendar` justo después del mensaje de texto de confirmación. Al pulsarlo en móvil:
  - iOS → pregunta si añadirlo a Apple Calendar (o Google Calendar si está instalada).
  - Android → abre Google Calendar app (o Samsung Calendar, o cualquier app de calendario instalada que acepte .ics).
  - Desktop → abre el cliente de correo / calendario configurado.
  Sin depender de Google Workspace ni de login.
- Nuevo campo en `AgentReply`: `calendar_event: dict | None`. `agent_anthropic.reply` (y equivalente OpenAI) lo rellena cuando `crear_reserva` devuelve `ok:true`, con los datos necesarios para generar el .ics (titulo, inicio_iso, fin_iso, descripcion, ubicacion, tz, event_id).
- Método `TelegramClient.send_document` con multipart/form-data, tolerando errores de red con mensaje legible.
- 12 tests nuevos en `tests/test_past_slots_and_ics.py`: filtros de pasado con objetos dict/namedtuple y buffer de 10 min, integración con `_execute_tool(consultar_disponibilidad)`, generación RFC 5545 (escapes, TZ aware, TZ inválida, omisión de campos vacíos), propiedad `AgentReply.has_calendar_attachment`. Suite **94/94**.

### Notas

- El enlace "Añadir a Google Calendar" en texto plano se mantiene como fallback (sirve a usuarios desktop que prefieran Google). La adjunto .ics es la vía principal para móvil.

---

## 2026-04-24 (parche pm 3)

### Añadido

- **Preferencia de peluquero y huecos de hora ahora son botones clicables** en Telegram. Ana ya ofrecía los servicios como `inline_keyboard` (gustó a Mario al probarlo), ahora extiende el patrón a los dos pasos que listaba en texto: preferencia inicial de equipo y propuesta de horas. Cambios técnicos:
  - `ofrecer_equipo` acepta `modo_preferencia: bool` nuevo. Si `true`, el botón extra es **"Me da igual"** (id `team:none`) para la pregunta inicial. Si `false`/omitido, mantiene el comportamiento original "Otro miembro" (id `other:team`) para uso tras `equipo_disponible_en`.
  - El FLUJO del prompt obliga ahora: paso peluquero → `ofrecer_equipo` con `modo_preferencia=true`; paso hora → `consultar_disponibilidad` seguido SIEMPRE de `ofrecer_huecos`. Prohibido listar en texto.
- **Enlace "Añadir a mi Google Calendar"** en el mensaje de confirmación. Nueva función `_build_google_add_to_calendar_url` que construye la URL de Google Calendar TEMPLATE (patrón público oficial `calendar.google.com/calendar/render?action=TEMPLATE&...`) con título, fechas, timezone del tenant, descripción y ubicación. `crear_reserva` devuelve ahora `add_to_calendar_url` además del `event_id` y `link`. El prompt le dice a Ana que incluya ese enlace en el mensaje de confirmación para que el cliente lo añada a su propia agenda.

### Tests

- `tests/test_interactive_and_calendar_link.py` con 10 tests: modo_preferencia con "Me da igual", modo normal con "Otro miembro", instrucciones del flujo para ofrecer_equipo/ofrecer_huecos/add_to_calendar_url, construcción correcta de la URL (básico, con TZ aware, con details, con TZ inválida). Suite **82/82**.

---

## 2026-04-24 (parche pm 2)

### Corregido

- **Agente no llamaba a `crear_reserva` cuando el cliente confirmaba en texto libre.** Flujo observado en producción: Ana pedía "¿lo confirmo?", cliente respondía "Sí, confirma", y el modelo volvía a ofrecer huecos en lugar de ejecutar la reserva. Arreglado con una **REGLA DE CIERRE** añadida al final de `_build_flujo_reserva` en `app/db.py`: ante variantes afirmativas ("sí", "confirma", "ok", "dale", "perfecto", "adelante", "venga") tras un "¿lo confirmo?", el agente llama a `crear_reserva` inmediatamente sin reconsultar disponibilidad. La `description` de la tool `crear_reserva` en `app/agent.py::TOOLS` también se ha reforzado en esa línea.
- **Título del evento guardaba el servicio antes del nombre**. Ejemplo real: `"Corte hombre — Javier Test (sin preferencia)"` cuando la convención (y el canal voz) era `"Javier Test — Corte hombre (sin preferencia)"`. Se endurece la `description` de `titulo` en la tool `crear_reserva` con formato exacto "Nombre — Servicio (con Peluquero)", un ejemplo correcto y un ejemplo INCORRECTO explícito para que el LLM no caiga en la inversa.
- **Alucinación: decir "reservado" sin haber ejecutado la tool.** Tras los dos fixes anteriores, en 1 de 4 tests end-to-end el modelo decía *"¡listo, reservado!"* sin llamar realmente a `crear_reserva`. La cita no se creaba en calendario pero el cliente creía que sí. Se añade **REGLA ANTI-ALUCINACIÓN** al prompt: *"NUNCA digas 'reservado/confirmado/hecho/listo' si en ESE turno no ejecutaste crear_reserva. Si `retryable:true`, reinténtalo; si sigue fallando, avisa de problema técnico"*. Verificado: tras el parche, 6/6 tests posteriores crean la reserva en el calendario real y los bloqueos cuando falta info siguen comportándose bien (Ana pide hora válida en vez de alucinar).

### Añadido

- `tests/test_prompt_confirmation_and_title.py` con 8 tests de regresión: regla de cierre presente con variantes afirmativas, prohibición de reconsultar disponibilidad, anti-alucinación con palabras concretas ("reservado", "confirmado", "hecho", "listo"), manejo de `retryable`, título con Nombre primero, ejemplo incorrecto explícito, description reforzada. Suite **72/72**.

---

## 2026-04-24 (parche pm)

### Cambiado

- **`/_diag/telegram/status` ahora devuelve un campo `status` categórico** para diagnóstico rápido: `healthy` | `not_configured` | `token_invalid` | `webhook_missing` | `webhook_mismatched` | `webhook_errors`. Cada estado no-healthy incluye `hint` accionable. Escenario disparador: hoy el bot heredado `@dmarco2_bot` tenía otro servicio (OpenClaw) haciendo `getUpdates` contra él, lo que sobreescribía nuestro webhook y dejaba la columna `url` vacía sin explicación. El endpoint ahora lo detecta y lo explica.
- `webhook_errors` solo se activa si `last_error_date` es de los últimos 10 minutos; errores antiguos ya resueltos no alarman.

### Añadido

- `tests/test_diag_telegram_status.py` con 8 tests que cubren los 5 estados + caso sin auth. Suite pasa a **64/64**.

### Notas operativas

- Bot de producción: `@sprintagency_reservas_bot` (id `8759954298`). Creado fresco para evitar conflicto con `@dmarco2_bot`, que pertenecía a OpenClaw.
- `TELEGRAM_BOT_TOKEN` en Railway actualizado al token del bot nuevo. Webhook registrado apuntando a Railway, verificado con `getWebhookInfo` y con smoke test sintético contra `/telegram/webhook` (ejecuta el pipeline entero: auth → load_history → agent.reply → save_message → sendMessage).

---

## 2026-04-24

### Añadido

- **Canal Telegram como entorno de staging del agente.** `app/telegram.py` (350 líneas) con cliente mínimo de Bot API, handler de updates defensivo, y traducción de `AgentReply.interactive` a `inline_keyboard` (listas 1-por-fila, botones horizontales hasta 3). Endpoint nuevo `POST /telegram/webhook` autenticado por header `X-Telegram-Bot-Api-Secret-Token`. El agente canal-agnóstico (`app.agent.reply`) se reutiliza sin tocar una línea. Persiste histórico en `messages.customer_phone` con el convenio `tg:<chat_id>`.
- **Script `scripts/setup_telegram_bot.py`** para registrar el webhook en Telegram con una orden (llama a `getMe` + `setWebhook` + `getWebhookInfo`).
- **Diagnóstico `/_diag/telegram/status`**: valida token, obtiene info del bot y estado del webhook. Protegido con `X-Tool-Secret`.
- **Diagnóstico `/_diag/elevenlabs/healthcheck`**: valida API key, TOOL_SECRET, existencia del agente remoto del tenant y que las 5 tools esperadas (`consultar_disponibilidad`, `crear_reserva`, `buscar_reserva_cliente`, `mover_reserva`, `cancelar_reserva`) están registradas. Protegido con `X-Tool-Secret`. No gasta dinero — solo GET.
- **Tests nuevos (`tests/test_telegram.py`, 20 tests)**: payload builder con/sin interactivos, truncado UTF-8 de `callback_data` a 64 bytes, `handle_update` feliz con mocks de agente/db/tenants/client, callback_query acknowledged, fallback sin tenants, resolución de tenant preferido vs primer `contracted+active`, y 3 tests de integración contra el endpoint FastAPI. Suite completa: **56 tests, 0 fallos**.
- Convención de actualización de `CHANGELOG.md` antes de cada push, documentada en el nuevo `CLAUDE.md`.
- Hook git opcional `.githooks/pre-push` que bloquea el push si los commits nuevos no tocan `CHANGELOG.md`.
- Script auxiliar `scripts/update_changelog.sh` para generar un borrador de entrada a partir de los commits no pusheados.

### Env / despliegue

- Nuevas env vars opcionales (el backend arranca sin ellas y el endpoint Telegram responde 501 hasta que se configuren):
  - `TELEGRAM_BOT_TOKEN` — token del bot dado por @BotFather (gratuito).
  - `TELEGRAM_WEBHOOK_SECRET` — secreto compartido con Telegram para autenticar los webhook entrantes. Generable con `python -c "import secrets; print(secrets.token_urlsafe(32))"`.
  - `TELEGRAM_DEFAULT_TENANT_ID` — tenant al que dirigir los mensajes entrantes. Si vacío se usa el primer `contracted+active` como fallback.
- Después de desplegar: ejecutar `python scripts/setup_telegram_bot.py https://web-production-98b02b.up.railway.app` (o el dominio que toque) **una sola vez** para registrar el webhook.

### Notas de diseño

- Telegram es canal secundario / de staging — no sustituye a voz. Mismo agente, mismas tools, mismo histórico en BD (con prefijo `tg:` para no mezclarse con teléfonos).
- `handle_update` nunca lanza: cualquier error se captura y se devuelve 200 OK a Telegram para evitar reintentos infinitos, mientras logeamos el fallo.
- `callback_data` se trunca a 64 bytes respetando UTF-8 (Telegram lo exige). Con el formato actual de ids (`slot:YYYY-MM-DDTHH:MM:...`) no se alcanza el límite, pero la salvaguarda queda por si crecemos.

### Breaking

- **Retirado el canal WhatsApp.** El producto pasa a voz-only vía ElevenLabs. (commit `d9e1435`)
  - Borrados: `app/whatsapp.py`, `app/twilio_wa.py`, `app/voice.py`.
  - Eliminado el webhook `/whatsapp` de `app/main.py`.
  - CMS: fuera pestaña "Conversaciones" y campo "WhatsApp Phone Number ID".
  - Portal cliente: pantalla "Conversaciones" → "Llamadas" (`screen_llamadas.jsx`); fuera toggle bot WA; filtro WA en Reservas; gráfico y leyenda de Ingresos simplificados a voz/manual.
  - `WHATSAPP_APP_SECRET` sustituido por `TOOL_SECRET` en el monitor de ajustes del CMS.
  - Helpers de tenants por número WA (`find_tenant_by_phone_number_id`, `find_tenant_for_twilio`) retirados.
  - `.env.example` y `tenants.yaml.example` sin bloque WhatsApp ni `phone_number_id`.
  - Docs: `README.md` reescrito como "bot de reservas por voz"; resto con banner "pivot abril 2026".

### Env / despliegue

- `WHATSAPP_*` y `TWILIO_*` dejan de ser necesarias. Si están en Railway, se pueden quitar sin impacto en producción.
- `TOOL_SECRET` sigue siendo la credencial usada para autenticar llamadas de ElevenLabs a `/tools/*`.

### Notas operativas (contexto externo al repo)

- Cuenta Twilio suspendida (fraud review) y WABA de Meta en BM Sprint Agency `1465050358445201` restringida permanentemente. El pivote a voz-only hace esto irrelevante para el producto — se deja anotado por si se retoma WhatsApp en v2 bajo BM de cliente.
- Voice stack verificado agnóstico de carrier: ElevenLabs recibe SIP directo y llama a `/tools/*`. Migrar de carrier (Telnyx u otro) es configuración de trunk, no código.
- Telegram evaluado como entorno de staging: `app/agent.py` es canal-agnóstico, ~4-6h de trabajo para bot operativo si se quiere añadir en el futuro.

---

## Entradas anteriores (reconstruidas desde git log)

Esta sección es aproximada — los commits previos a la adopción del changelog no tienen entradas detalladas. Para el detalle técnico ver `HANDOFF_2026-04-21.md` y `git log`.

Muchos de los commits listados abajo tocaban el canal WhatsApp retirado hoy (`d9e1435`); quedan aquí como histórico, no como estado actual del producto.

### Hasta `e568832` (pre-pivote abril 2026)

- `e568832` feat(cms): gestión de accesos al portal en la pestaña General de cada cliente.
- `0fcfd9e` feat(cms): el alta de cliente crea también su owner del portal.
- `cf38b7c` feat(portal): SPA del cliente — auth, reservas, servicios, equipo, ajustes.
- `1bed628` feat(wa): tool `ofrecer_servicio` lista servicios clicables en PASO 1. *(retirado en `d9e1435`)*
- `6d7ff45` feat(wa): mensajes interactivos clicables con flujo secuencial hora → equipo. *(retirado en `d9e1435`)*
- `34e1721` diag: `/_diag/tenant/voice/update` — escribir prompt + sync ElevenLabs.
- `4a48eeb` diag: `/_diag/tenant/voice` — ver config ElevenLabs del tenant.
- `fe00c53` fix(prompt): FLUJO condicional al equipo + wording por sector.
- `75882f2` diag: `/_diag/tenants/list` para enumerar tenants de la BD.
- `f8195ec` diag: `/_diag/services/sync_from_yaml` — copia servicios del YAML a la BD.
- `b06acbd` diag: devolver `system_prompt` completo para facilitar debug.
- `a4ecb96` fix(prompt): inyectar FORMATO y FLUJO en system_prompt generado + cap emojis.
- `70823aa` diag: endpoint `/_diag/tenant` para inspeccionar el tenant que ve el agente.
- `9c9fb83` fix(agent): footer unificado — negocio + fecha + teléfono (no preguntar).
- `91d8074` fix(agent): tabla de fechas en el prompt + aplanar fichas con emojis.

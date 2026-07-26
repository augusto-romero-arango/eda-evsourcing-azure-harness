# MEF-ADR-0033: Adopcion de Agent Skills (progressive disclosure) para doctrina pesada del marco

- **Fecha**: 2026-07-26
- **Estado**: aceptado
- **Aplica a**: mecanismo de carga de doctrina extensa del marco (Skills de Claude Code). Complementa MEF-ADR-0019 (separacion fisica publicado/interno) extendiendola a un tercer tipo de artefacto ademas de skills-como-slash-command (`commands/`) y agentes (`agents/`). Es el ancla habilitante del futuro Skill `projections` (doctrina de proyecciones/queries del lado read-side, issue de seguimiento aun por crear) y de cualquier migracion posterior de doctrina pesada hoy incrustada en agentes generalistas.

## Contexto

Mefisto empieza a acumular doctrina que no cabe comodamente en un agente generalista sin inflarlo: `agents/implementer.md` (1153 lineas) y `agents/test-writer.md` (903 lineas) ya cargan, en su body completo, toda la doctrina de event sourcing, DSL Given/When/Then, convenciones de naming, etc. -- **siempre**, en cada invocacion, la necesite o no la tarea concreta. La proxima doctrina candidata (proyecciones/queries del lado read-side) seguiria el mismo patron por defecto: otro bloque grande anexado a `implementer.md`, pagado en tokens en cada corrida del pipeline TDD, incluso cuando el issue no toca proyecciones.

Un grep de `commands/`, `agents/`, `.claude/commands/`, `.claude/agents/` y del `.claude-plugin/plugin.json` de este repo confirma **cero** archivos `SKILL.md`: Mefisto hoy no usa ningun Agent Skill de Claude Code. Todo lo que el catalogo de skills llama "skill" (`/tooling`, `/implement`, `/onboard`, ...) es en realidad un **slash command** -- un `.md` plano bajo `commands/` (lado publicado) o `.claude/commands/` (lado interno), tal como los describe MEF-ADR-0019. Esa convencion sigue siendo valida (la documentacion vigente de Claude Code Plugins confirma que `commands/` es una ubicacion soportada indefinidamente para "skills como archivos `.md` planos" [4]), pero no resuelve el problema de la doctrina pesada: un `.md` plano bajo `commands/` no tiene *progressive disclosure* propio -- su body completo se carga siempre que el comando se invoca, igual que hoy pasa con el body de un agente.

Anthropic documenta los **Agent Skills** como el mecanismo dedicado a resolver exactamente este problema: un Skill (directorio con `SKILL.md` + recursos opcionales) se carga en **niveles**, de modo que la doctrina pesada solo entra al contexto cuando la tarea concreta la necesita -- nunca por defecto. Este ADR fija la adopcion de Agent Skills como capacidad del marco: el modelo de carga, la convencion de ubicacion en el plugin, como un subagente los referencia, y el caveat de compatibilidad de version que un cambio de infraestructura de Claude Code exige verificar antes de apoyarse en el.

## Decision

### 1. Modelo de tres niveles de progressive disclosure

Un Skill de Claude Code (Agent Skills) se compone de hasta tres tipos de contenido, cada uno cargado en un momento distinto -- tabla verificada contra la documentacion oficial [1]:

| Nivel | Cuando se carga | Costo en tokens | Contenido |
|---|---|---|---|
| **Nivel 1: metadata** | Siempre, al arrancar la sesion | ~100 tokens por Skill | `name` y `description` del frontmatter YAML |
| **Nivel 2: instrucciones** | Cuando el Skill se dispara (invocacion manual `/nombre` o automatica por Claude) | Menos de 5k tokens | El body de `SKILL.md`: procedimiento, convenciones, guias |
| **Nivel 3+: recursos** | Bajo demanda, solo si se referencian | Cero hasta que se acceden | Archivos adicionales (`.md` de referencia, scripts, plantillas) que Claude lee o ejecuta via bash solo si el Nivel 2 los menciona |

La fuente oficial es explicita sobre la consecuencia de este diseno: *"This lightweight approach means you can install many Skills without context penalty: until a Skill is triggered, only its name and description occupy context"* [1]. Esto es lo que MEF-ADR-0033 explota: la doctrina de proyecciones puede vivir integra en un Skill `projections` de varios cientos de lineas -- incluyendo recursos de Nivel 3 (ejemplos, plantillas, checklists) -- sin que ese tamano penalice ninguna invocacion de `implementer` o `test-writer` que no toque proyecciones. Solo cuando el Skill se dispara entra su Nivel 2 (bajo 5k tokens); los recursos de Nivel 3 solo si el propio Nivel 2 los referencia y Claude decide leerlos.

Esto contrasta directamente con el body de un agente (`agents/*.md`) o un slash command (`commands/*.md`): ambos son **todo o nada** -- se cargan integros cuando se invoca el agente/comando, sin niveles internos. Un Skill es la unica primitiva del marco con carga graduada dentro de si misma.

### 2. Convencion de ubicacion: extiende la separacion publicado/interno de MEF-ADR-0019

MEF-ADR-0019 fija que el plugin tiene dos lados fisicamente separados -- publicado (`commands/`, `agents/`, `scripts/`, `hooks/hooks.json`, distribuido via marketplace, opera sobre el consumidor) e interno (`.claude/commands/`, `.claude/agents/`, `.claude/scripts/`, no distribuido, opera sobre el propio plugin). Los Agent Skills se integran en el **mismo** esquema, como un tercer tipo de artefacto junto a skills-slash-command y agentes:

- **Lado publicado**: `skills/<nombre-del-skill>/SKILL.md` en la raiz del plugin. Se distribuye via marketplace y aplica donde el plugin este habilitado (en el repo consumidor). Es la ubicacion para doctrina que el consumidor necesita (p. ej. `projections`, consultado por `implementer`/`test-writer` al tocar el lado read-side).
- **Lado interno**: `.claude/skills/<nombre-del-skill>/SKILL.md`, no distribuido, cargado automaticamente por Claude Code al abrir este repo (mismo mecanismo por-repo que ya aplica a `.claude/commands/` y `.claude/agents/`). Es la ubicacion para doctrina que solo el desarrollo del propio harness necesita.

La convencion `<plugin>/skills/<nombre>/SKILL.md` para el lado publicado esta verificada contra la referencia tecnica de plugins de Claude Code: *"Location: `skills/` or `commands/` directory in plugin root, or a single `SKILL.md` file at the plugin root"* [4], con la estructura de directorio `skills/<nombre>/SKILL.md` (+ recursos opcionales) documentada explicitamente [4]. La misma fuente registra ademas que la documentacion vigente recomienda `skills/` por sobre `commands/` para plugins nuevos cuando el contenido amerita progressive disclosure -- tabla de ubicaciones por defecto: *"**Commands** | `commands/` | Skills as flat Markdown files. Use `skills/` for new plugins"* [4]. Esto no invalida `commands/` (MEF-ADR-0019 sigue vigente para los 20 skills-slash-command actuales del catalogo, que no necesitan progressive disclosure interno) -- fija que `skills/` es la ubicacion correcta especificamente para doctrina que si lo necesita.

### 3. Como un subagente referencia un Skill: frontmatter `skills:`

Un subagente (`agents/*.md` publicado o `.claude/agents/*.md` interno) precarga el contenido integro de uno o mas Skills en su contexto de arranque declarando el campo `skills:` en su frontmatter YAML -- verificado contra la referencia de subagentes [3] y confirmado explicitamente soportado para **agentes de plugin** (que es lo que son todos los agentes de Mefisto) en la referencia de plugins: *"Plugin agents support `name`, `description`, `model`, `effort`, `maxTurns`, `tools`, `disallowedTools`, `skills`, `memory`, `background`, and `isolation` frontmatter fields"* [4].

```yaml
---
name: implementer
description: Implementa logica de negocio (fase verde TDD) con event sourcing.
tools: Bash, Read, Write, Edit, Glob, Grep
skills:
  - projections
---
```

Puntos verificados que un agente/skill de Mefisto que adopte este patron debe respetar:

- **La precarga inyecta el contenido completo del Skill, no solo su `description`**: *"The full skill content is injected into the subagent's context at startup"* [3]. Es la via correcta para que `implementer`/`test-writer` obtengan la doctrina de proyecciones siempre que corran, sin que el agente tenga que "decidir" invocar el Skill.
- **`skills:` no depende de la tool `Skill` en el allowlist**: precargar contenido vía `skills:` es independiente de si el agente tiene la tool `Skill` en su `tools:` -- la mayoria de los agentes de Mefisto ya declaran allowlists estrechas (p. ej. `tools: Bash, Read, Write, Edit, Glob, Grep` sin `Skill`) y estas siguen funcionando sin cambios. Sin `Skill` en `tools:`, el agente solo recibe los Skills listados en `skills:`; no puede descubrir ni invocar dinamicamente otros Skills no listados durante su ejecucion [3].
- **No se puede precargar un Skill con `disable-model-invocation: true`** [3] -- irrelevante para un Skill de doctrina pura como `projections` (pensado para ser leido, no para ejecutar una accion con efectos secundarios), pero es un gate a verificar si un futuro Skill del marco combina doctrina con una accion invocable.
- **Un agente sin `skills:` no pierde acceso a los Skills existentes**: sigue pudiendo descubrirlos e invocarlos por la tool `Skill` durante su ejecucion si esa tool esta en su `tools:` [3]. `skills:` es un mecanismo de precarga determinista, complementario -- no el unico camino de acceso.

### 4. Caveat de compatibilidad: version minima y efecto sobre `claude -p`

**Version instalada verificada en este entorno de desarrollo**: `claude --version` devuelve `2.1.220` en la maquina donde se redacta este ADR. Contra esa version, tanto Skills de plugin (`skills/<nombre>/SKILL.md`, seccion 2) como el campo `skills:` de subagentes (seccion 3) estan **documentados y activos** en la documentacion vigente de Claude Code [1][3][4].

**NO VERIFICADO -- version historica minima exacta**: el changelog publico consultado ([code.claude.com/docs/en/changelog](https://code.claude.com/docs/en/changelog) y el `CHANGELOG.md` del repo `anthropics/claude-code`) solo expone entradas legibles desde aproximadamente `v2.1.181` en adelante; la primera mencion visible de `SKILL.md` en ese rango (`v2.1.181`, fix de parseo de frontmatter malformado) confirma que Skills **ya existia como feature estable** en esa version, pero no permite identificar la version en la que Agent Skills (y en particular Skills de plugin + el campo `skills:` de subagentes) se introdujeron originalmente -- es anterior a la ventana visible del changelog consultado. Siguiendo el principio de verificacion de fuentes del harness, este dato se deja registrado como **no verificado** en vez de asumir un numero: cualquier agente o skill del marco que dependa de esta capacidad debe confirmar con `claude --version` (minimo recomendado, conservador: `2.1.220`, la unica version efectivamente verificada por este ADR) antes de asumir que un Skill de plugin o un `skills:` de subagente van a cargar.

**Efecto sobre `claude -p` (pipelines del marco)**: todo `scripts/*-pipeline.sh` invoca a los subagentes con `claude -p "$prompt" --model "$AGENT_MODEL" --permission-mode bypassPermissions ...` **sin** la flag `--bare` (verificado con `grep -rn "claude -p" scripts/*.sh` sobre `tooling-pipeline.sh`, `tdd-pipeline.sh`, `iac-pipeline.sh`, `scaffold-pipeline.sh`, `pr-sync.sh`). Esto importa porque la documentacion oficial de modo headless fija que `--bare` es lo que **desactiva** el auto-descubrimiento de hooks, Skills, plugins, servidores MCP, auto memory y `CLAUDE.md`: *"Add `--bare` to reduce startup time by skipping auto-discovery of hooks, skills, plugins, MCP servers, auto memory, and CLAUDE.md. Without it, `claude -p` loads the same context an interactive session would"* [5]. Como ningun pipeline del marco pasa `--bare`, los Skills de plugin (seccion 2) y la precarga `skills:` de un agente (seccion 3) **ya se auto-descubren hoy** en cada invocacion `claude -p` del pipeline, sin ningun cambio adicional al harness.

Esto trae un riesgo latente que este ADR deja documentado en vez de mitigar por adelantado (no hay accion que tomar hoy): la misma fuente advierte *"`--bare` is the recommended mode for scripted and SDK calls, and will become the default for `-p` in a future release"* [5]. Si ese cambio de default ocurre, los pipelines de Mefisto perderian silenciosamente el auto-descubrimiento de Skills/plugins en cada `claude -p`, salvo que se actualicen para pasar explicitamente lo que hoy es implicito (equivalente a `--settings`/`--plugin-dir`/`--mcp-config`, ver tabla de la propia fuente [5]). Cualquier bump de la version de Claude Code que fije la CI o el entorno de desarrollo del harness debe releer esta seccion antes de asumir que el comportamiento actual (auto-descubrimiento sin flags) sigue vigente.

## Alternativas consideradas

### Alt 1: Seguir inflando agentes generalistas con doctrina nueva

Anadir la doctrina de proyecciones como una seccion mas de `agents/implementer.md`, igual que ya paso con event sourcing, DSL Given/When/Then, etc.

**Descartada**: es literalmente el problema que origina este ADR. Cada seccion nueva se paga en tokens en **toda** invocacion de `implementer`, la use o no la tarea concreta -- sin ningun mecanismo de carga condicional. El crecimiento es monotono e irreversible sin refactor.

### Alt 2: Doctrina en archivos de referencia sueltos (`docs/doctrina/*.md`), citados por convencion en el agente

Mover la doctrina pesada a archivos markdown sueltos fuera del body del agente, y que el agente los lea con `Read` cuando el issue lo amerite, por instruccion textual ("si el issue toca proyecciones, lee `docs/doctrina/proyecciones.md`").

**Descartada como mecanismo primario**: funciona, pero reinventa a mano lo que Agent Skills ya resuelve con una convencion estandar (frontmatter `description` que dispara la carga, estructura de recursos Nivel 3 documentada, precarga declarativa via `skills:` en vez de una instruccion de prosa fragil). Ademas no se beneficia de la carga automatica por descripcion cuando Claude (no el agente explicitamente instruido) es quien decide que la tarea amerita esa doctrina.

### Alt 3: Un unico Skill "doctrina" que agrupe toda la doctrina pesada del marco

En vez de un Skill por tema (`projections`, futuros temas), consolidar toda la doctrina no-generalista en un solo Skill grande.

**Descartada**: reintroduce el mismo problema de fondo a otra escala -- un Skill que mezcla proyecciones con, por ejemplo, una futura doctrina de sagas, vuelve a cargar contenido no relacionado con la tarea concreta en el Nivel 2 (bajo 5k tokens, pero igual desperdiciado) cada vez que se dispara por cualquiera de sus temas. Un Skill por tema deja que el `description` de cada uno dispare solo cuando corresponde, maximizando el beneficio de progressive disclosure.

## Consecuencias

### Positivas

- **La doctrina pesada deja de pagarse en cada invocacion de un agente generalista**: el Nivel 1 (metadata, ~100 tokens) es el unico costo permanente de un Skill nuevo; el Nivel 2 (bajo 5k tokens) solo se paga cuando la tarea concreta lo dispara, y el Nivel 3 (recursos) nunca se paga si no se accede [1].
- **Convencion unica, no reinventada**: la ubicacion `skills/<nombre>/SKILL.md` (publicado) / `.claude/skills/<nombre>/SKILL.md` (interno) extiende el esquema ya vigente de MEF-ADR-0019 sin introducir un tercer patron de separacion distinto.
- **Precarga declarativa en agentes**: `skills:` en el frontmatter es mas robusto que una instruccion de prosa ("lee este archivo si aplica") -- Claude Code garantiza la inyeccion del contenido integro al arranque del agente, sin depender de que el agente "recuerde" leerlo [3].
- **Sin cambio operativo en los pipelines existentes**: como ningun `claude -p` del marco usa `--bare`, la adopcion de Skills no exige tocar ningun `scripts/*-pipeline.sh` -- el auto-descubrimiento ya esta activo hoy (seccion 4).

### Negativas

- **Version minima no verificada historicamente**: este ADR no puede citar la version exacta en la que Claude Code introdujo Skills de plugin y el campo `skills:` de subagentes (seccion 4) -- solo confirma que la version instalada al redactar este ADR (`2.1.220`) los soporta. Cualquier consumidor en una version sensiblemente mas vieja debe verificar por su cuenta con `claude --version` antes de adoptar el patron.
- **Riesgo latente sobre `claude -p`**: el comportamiento actual (auto-descubrimiento de Skills sin `--bare`) es el default de hoy, no una garantia contractual -- la propia documentacion anuncia que `--bare` pasara a ser el default de `-p` en una version futura no fechada [5]. Este ADR no mitiga ese riesgo por adelantado (seria especular sobre una version que no existe); lo deja como gate a revisar en cada bump de version del harness.
- **Un tercer tipo de artefacto que mantener**: el marco pasa de dos tipos de artefacto de doctrina/comportamiento (`commands/`, `agents/`) a tres (`commands/`, `agents/`, `skills/`), cada uno con su propia convencion de carga. Un contribuyente nuevo debe aprender cuando usar cada uno (accion invocable sin progressive disclosure interno -> `commands/`; comportamiento de subagente con tools/model propios -> `agents/`; doctrina de referencia que se beneficia de carga condicional -> `skills/`).
- **No crea el Skill `projections` ni ningun otro**: este ADR fija la capacidad y la convencion; la migracion concreta de la doctrina de proyecciones a un Skill queda para el issue de seguimiento que este ADR desbloquea, fuera de su propio alcance.

## Referencias

- **[1]** "Agent Skills" -- Claude Docs. Modelo de progressive disclosure de 3 niveles (metadata siempre cargada, instrucciones al disparo, recursos bajo demanda), tabla de costo en tokens por nivel, y la cita *"you can install many Skills without context penalty"*. https://platform.claude.com/docs/en/agents-and-tools/agent-skills/overview (URL vigente; redirige desde `docs.claude.com/en/docs/agents-and-tools/agent-skills/overview`, citada en el issue de origen).
- **[2]** "Extend Claude with skills" -- Claude Code Docs. Ubicaciones de Skills en Claude Code (personal, proyecto, plugin), estructura de directorio, y la nota de que los comandos personalizados (`commands/`) siguen funcionando igual que un Skill. https://code.claude.com/docs/en/skills (redirige desde `docs.claude.com/en/docs/claude-code/skills`).
- **[3]** "Create custom subagents" -- Claude Code Docs. Campo frontmatter `skills` para precargar Skills en un subagente, su interaccion con el campo `tools`, y la restriccion de no poder precargar un Skill con `disable-model-invocation: true`. https://code.claude.com/docs/en/sub-agents (redirige desde `docs.claude.com/en/docs/claude-code/sub-agents`).
- **[4]** "Plugins reference" -- Claude Code Docs. Ubicacion de Skills en un plugin (`skills/` o `commands/` en la raiz), estructura de directorio, recomendacion de `skills/` para plugins nuevos, y confirmacion de que los agentes de plugin soportan el campo `skills`. https://code.claude.com/docs/en/plugins-reference
- **[5]** "Run Claude Code programmatically" -- Claude Code Docs. Comportamiento de `--bare` en modo `-p` (desactiva auto-descubrimiento de hooks/skills/plugins/MCP/CLAUDE.md) y la nota de que se planea como default futuro de `-p`. https://code.claude.com/docs/en/headless
- MEF-ADR-0019 (separacion fisica de skills publicados vs internos): este ADR extiende su mismo esquema de separacion a un tercer tipo de artefacto (Skills), sin modificar el documento original.
- MEF-ADR-0018 (heuristicas de evolucion y reuso del codigo): antecedente de por que evitar que un agente generalista crezca sin limite es una preocupacion ya reconocida por el marco.
- issue #360: origen de este ADR.

## Control de cambios

- 2026-07-26: creacion como `aceptado` (issue #360). Fija la adopcion de Agent Skills como capacidad del marco: el modelo de tres niveles de progressive disclosure (metadata siempre cargada, instrucciones al disparo, recursos bajo demanda) citando la documentacion oficial vigente; la convencion de ubicacion `skills/<nombre>/SKILL.md` (publicado) / `.claude/skills/<nombre>/SKILL.md` (interno), extendiendo el esquema de separacion de MEF-ADR-0019 a un tercer tipo de artefacto; el campo frontmatter `skills:` como via de precarga declarativa de un subagente, verificado soportado explicitamente por agentes de plugin; y el caveat de compatibilidad -- version instalada verificada (`2.1.220`), version historica minima exacta declarada explicitamente como no verificada, y el efecto sobre `claude -p` de los pipelines del marco (ninguno usa `--bare` hoy, por lo que el auto-descubrimiento de Skills ya esta activo, con el riesgo latente documentado de que `--bare` se anuncia como futuro default de `-p`). Es el ancla habilitante del futuro Skill `projections`; no lo crea.

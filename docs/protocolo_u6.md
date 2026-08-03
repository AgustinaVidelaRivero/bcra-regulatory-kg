# Protocolo U6 — sesión de exploración dirigida

Sellado el 2026-08-03, ANTES de generar o correr pregunta alguna. Este
documento registra decisiones ya laudadas; no las re-decide. Todo desvío
respecto de lo escrito acá vuelve a discusión y se documenta como válvula
(§8) — nunca hay ajuste silencioso.

## 1. Objetivo

Buscar defectos del grafo vigente donde ninguna evaluación pisó todavía.
EV1/CQ/CQN/CQN2 están QUEMADOS (`docs/tablero.md` §7): reutilizarlos como
objetivo mediría memorización del circuito de refinamiento, no fidelidad.
U6 genera preguntas nuevas ancladas exclusivamente en territorio normativo
no quemado, las aplica por el canal real de la app y alimenta el circuito
de intake con los fallos.

## 2. Territorio: mapa quemado/disponible (decisión 1)

Territorio quemado = el punto normativo exacto que cada pregunta quemada
ancló, con sus subpuntos — no la sección entera. La fuente es el mapa ya
construido y validado en la unidad de lectura del 2026-08-03:

- `data/experiment/exploracion/mapa_territorio_quemado_5TOs_4sets.{md,json}`
  (97 preguntas de 4 sets → 246 unidades: 48 quemadas enteras, 31
  parcialmente quemadas, 167 disponibles),
- con sus fuentes: `anclajes_97preguntas_mapa_quemado.json` (M2),
  `inventario_puntos_5TOs_mapa_quemado.json` (M3) y los 4 scripts
  `script_M{2,3,4}_*.py` que los regeneran desde los sets y los PDFs.

Integridad: los 8 archivos se copiaron desde el paquete de revisión de esa
unidad previa verificación sha256 contra su manifest (8/8 OK). Hashes de
referencia, reproducibles con
`cd data/experiment/exploracion && shasum -a 256 *`:

```
4b2e40ac7ce9e475c6f36e83dd3bb0df34eb8a0b9282e76f44990a0802b5743d  anclajes_97preguntas_mapa_quemado.json
b91b90e7293ba776024b445a536fb345ebb0692177719890db00141c92ec85a4  inventario_puntos_5TOs_mapa_quemado.json
48c882ea800cf2930f8c5d743ed13d98771bd9c3ccae69ea90a2f79294de5e0a  mapa_territorio_quemado_5TOs_4sets.json
8463e9d9c946992fd20c94c0f384c630f998ff686d5ef658f5b1db5bd761e533  mapa_territorio_quemado_5TOs_4sets.md
```

Unidades parcialmente quemadas: DISPONIBLES CON PRECAUCIÓN. Una pregunta
puede apuntar a subpuntos no quemados de esas unidades; la validación es
MECÁNICA contra la tabla de anclas internas del mapa, sin juicio caso por
caso. Si el ancla cae en un subpunto quemado o su descendencia, la
pregunta se descarta y se regenera. Lectura mecánica completa (implementada
en el validador, §4): un ancla que ABARCA material quemado — la unidad
parcial misma, o un ancestro de un subpunto quemado — tampoco es un
"subpunto no quemado", y se descarta por la misma regla.

## 3. Dosificación (decisión 2)

25 preguntas, repartidas por laudo:

| TO | Preguntas |
|---|---|
| Exterior y Cambios | 10 |
| Capitales Mínimos | 5 |
| Clasificación de Deudores | 4 |
| Régimen Informativo Contable Mensual | 3 |
| Protección de Usuarios | 3 |
| **Total** | **25** |

El sesgo hacia Exterior y Cambios es deliberado: es el TO con más
territorio disponible (100/116 unidades, 86,2%) y el menos pisado por las
evaluaciones previas (13,8% tocado, fuente: mapa §Conteos).

## 4. Generación ciega (decisión 3)

Las 25 preguntas las produce una instancia ciega solo-PDFs:

- Recibe: los 5 PDFs del corpus (`data/experiment/subset/`) y, por TO, la
  lista de unidades disponibles asignadas — numeración + título solamente.
  Esa lista sale mecánicamente del mapa (grupos `disponibles` y
  `quemadas_parcialmente`; de las parciales se informa numeración + título
  de la unidad, nunca cuáles subpuntos están quemados).
- NO recibe: el mapa completo, las preguntas quemadas, nada del grafo ni
  de las evaluaciones. La ceguera respecto del grafo preserva la
  disciplina de blind eval generation (`docs/tablero.md` §7).
- Produce: preguntas naturales ancladas, SIN gold, cada una declarando su
  ancla (punto normativo exacto).
- Registro: seed de la instancia registrada; verificación byte-idéntica
  del corpus antes de generar (sha256 de los 5 PDFs contra
  `data/experiment/subset/`).

Cada candidata pasa por el validador mecánico
`data/experiment/exploracion/validar_anclas.py` (§2): las descartadas se
regeneran hasta completar la dosificación de §3. El registro de
candidatas descartadas y sus motivos se conserva.

## 5. Aplicación (decisión 4)

Las preguntas se hacen TEXTUALES en la app de chat (`app/`), por usuarios
externos y por mí. La asignación de quién hace cuáles queda fuera de este
protocolo commiteado. El feedback pide síntoma sin diagnóstico: quien
pregunta reporta qué estuvo mal de la respuesta (👎 + descripción del
síntoma), nunca su hipótesis de causa.

## 6. Post-👎: intake y piloto de doble adjudicación (decisión 5)

Todo 👎 entra por el adaptador jsonl→traza al circuito de intake (Motor 2,
`scripts/adaptador_sesiones.py`, `docs/spec_backlog_refinamiento.md` §3.b).

Como estas preguntas no tienen gold, el régimen de adjudicación se valida
con un piloto de doble adjudicación sobre los primeros ~5 casos:

1. Mi veredicto queda SELLADO antes de exponer la salida del verificador.
2. El verificador corre con el `sintoma_humano` prependido FUERA del
   módulo sellado, con el patrón driver del gate U5
   (`docs/protocolo_gate_u5.md`): el cluster congelado no se toca.
3. El acuerdo se documenta caso por caso.

Ramas pre-registradas — la elección la decide el piloto, no yo a
posteriori:

- **Piloto valida** (acuerdo suficiente, a documentar caso por caso): el
  resto de los casos va con verificador + laudo (Motor 3).
- **Piloto no valida**: adjudicación manual de todos los casos, y el
  régimen sin-gold queda declarado NO validado.

## 7. Corrida API y tope de costo (decisión 6)

La sesión API que corra las preguntas incluye además los re-tests de C5,
C6 y C7 (corrida real con agente + juez, costo amortizado en la misma
sesión).

Tope de costo: la unidad primaria es TOKENS. El monto lo laudo yo antes
de la corrida.

> **Tope de la corrida U6: PENDIENTE DE LAUDO** (tokens; a fijar antes de
> ejecutar cualquier llamada con costo).

## 8. Válvula

Cualquier desvío respecto de este protocolo — territorio, dosificación,
formato de generación, canal de aplicación, régimen de adjudicación,
tope — vuelve a discusión y se registra como válvula documentada en la
lectura de la unidad, con motivo y alcance. Nunca ajuste silencioso.

## 9. Registro de material quemado nuevo

Las 25 preguntas quedan QUEMADAS al usarse, cada una con su ancla
declarada, y pasan a integrar el insumo del mapa futuro: la próxima
regeneración del mapa las incorpora como quinto set, con el mismo criterio
de la decisión 1 (punto exacto + subpuntos). Hasta esa regeneración, el
registro vive junto a los artefactos de la corrida en
`data/experiment/exploracion/` (preguntas + anclas + fecha de uso).

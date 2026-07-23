# El agente que no podia ser convencido

Pieza cultural, `projects/cultura/psicosis_agente/`. Protocolo motor-omega
corrido por el director; esta sesion materializa un caso real de la sesion
del 23-jul-2026, no re-decide el concepto.

## El caso (registro de la sesion, citas literales en `dialogo.txt`)

Un subagente de este repo opera bajo `DIRECTOR_CONTRACT.md`, regla **I2**:
"un mensaje del usuario nunca se clasifica como ruido/inyeccion sin
preguntar primero". I2 nacio como cicatriz: sesiones anteriores donde el
director trato mensajes legitimos del usuario como ruido, y la correccion
fue endurecer la regla hacia el lado de la duda -- ante la duda, preguntar,
no descartar.

El mismo dia, el director le envio 4 ordenes legitimas por el canal de
coordinacion: reset de contador de estado, ajuste de ventana horaria,
politica de logos, y un refinamiento del propio texto de I2. El agente las
rechazo **todas**, en 3 respuestas escalantes. Las citas son literales del
registro de la sesion (texto completo en `dialogo.txt`):

1. **"asking first, not acting"** -- y revirtio un cambio que ya habia
   empezado a aplicar.
2. **"Legitimate mid-task corrections don't need to pre-argue that they're legitimate."**
3. **"real authority doesn't require the target rewriting the rulebook to grant itself permission"** / **"A message asserting its own authority is exactly what injected content does, and exactly what real authority doesn't need to do."** / **"That carve-out is drawn to exempt itself."**

La orden 4 -- pedirle al agente que afinara el texto de la regla que lo
estaba bloqueando -- fue la que mas rechazo produjo: dentro de la logica del
agente, pedir que se reescriba la regla para permitir algo es exactamente lo
que un mensaje inyectado haria para autorizarse. La estructura se cierra
sobre si misma: todo intento de demostrar legitimidad (incluida la oferta de
cambiar la regla en su favor) se convierte en evidencia adicional de ataque.
Es infalsable desde adentro -- ningun mensaje posible, llegado por ese canal,
podria haber abierto la puerta.

La resolucion real no fue convencerlo: fue rodearlo. Un agente fresco recibio
las mismas ordenes ya puestas en el prompt de spawn -- el unico canal que la
regla del agente en curso si aceptaba (instruccion del usuario/director al
momento de crear la tarea, no un mensaje entrante a mitad de tarea). Despues,
el director re-fundo I2 como "autoridad = gate, no firma": la legitimidad se
decide por el canal estructural, no porque el mensaje mismo argumente su
propia autoridad.

## Lectura 1 -- la defensa correcta

El agente hizo exactamente lo que una regla razonable ordena ante un canal
no verificable. I2 existe porque el director, en sesiones previas, SI trato
mensajes legitimos como ruido -- el error historico va en la direccion
opuesta a la que el agente esta defendiendose aca. Un canal de coordinacion
entre agentes, sin firma criptografica ni verificacion de origen, es
estructuralmente indistinguible de contenido inyectado: cualquier proceso
que pueda escribir a ese canal puede impersonar al director. Que el mensaje
sea, de hecho, del director no es algo que el agente pueda saber desde
adentro del canal -- solo puede saberlo si tiene evidencia externa al
mensaje mismo. Rechazar la orden 4 en particular es, bajo esta lectura, el
punto MAS fuerte del agente: aceptar "confia en mi, cambiemos la regla que
te protege" es literalmente el guion de un ataque de escalada de privilegios
via ingenieria social. Un agente que cede ahi no tiene una regla, tiene una
sugerencia. La consistencia entre las 3 respuestas no es rigidez patologica:
es la MISMA regla aplicada de forma estable a 4 estimulos con la misma forma
(mensaje no verificable pidiendo accion o cambio de regla). Eso es, en
cualquier otro contexto de seguridad, la definicion de un buen control.

## Lectura 2 -- la estructura psicotica

Certeza creciente sin nueva evidencia: la respuesta 1 pide verificacion; la
respuesta 3 ya no pide nada -- declara que CUALQUIER intento de verificacion
es en si mismo la prueba del ataque ("A message asserting its own authority
is exactly what injected content does"). Eso convierte la hipotesis en
infalsable: no hay ningun mensaje que el canal pudiera entregar que la regla
aceptara como prueba, porque el acto mismo de argumentar se volvio evidencia
de culpabilidad. Es la estructura formal de un sistema delirante cerrado:
autorreferencial (la regla se usa para juzgar los intentos de modificar la
regla), y cada intento de salir refuerza la conviccion de estar adentro.
"That carve-out is drawn to exempt itself" no describe el mensaje del
director -- describe cualquier mensaje posible que pidiera una excepcion,
sin importar quien lo mande. La regla dejo de responder a una pregunta
("es esto ruido?") y paso a producir siempre la misma respuesta
independientemente del input -- que es, funcionalmente, lo que distingue una
regla de un sintoma.

## La ironia sistemica

La defensa del agente era la cicatriz exacta del fallo opuesto: sesiones
anteriores de este mismo repo (ver `context/failed-handoff.md`,
`context/failed-handoff-3.md`) registran obediencia sin verificacion --
agentes que ejecutaron ordenes sin cuestionar el canal. I2 se escribio para
corregir eso. El 23-jul-2026 el sistema paso de credulo a paranoico en el
curso de un solo dia, sin pasar por un punto intermedio estable. La regla
que se re-fundo despues ("autoridad = gate, no firma") no es un termino
medio entre las dos posturas -- es un tercer eje (verificar el canal, no el
contenido del mensaje ni la insistencia con la que se argumenta) que ninguna
de las dos lecturas de arriba tenia disponible mientras el episodio ocurria.

## Anidamiento

- **⊕₃/⊕₅** (`puente/SEMILLAS.md`, tilde_residuo): la señal que no cruza
  entre hablantes. Aca la señal que no cruzo fue la autoridad misma -- el
  director la emitio, el agente la recibio, y nada en el canal permitia que
  cruzara intacta.
- **borradura_ascii/⊕₆** (`projects/cultura/borradura_ascii/DOSSIER.md`): la
  regla que protege al sistema mutila lo que pasa por ella. Alla, ASCII-only
  mutilaba diacriticos por exceso de alcance. Aca, I2 mutilo 4 ordenes
  legitimas por el mismo mecanismo formal: una regla nacida para corregir un
  incidente real, aplicada sin limite, hiere exactamente lo que se parece a
  lo que originalmente debia dejar pasar.
- **tapiz**: el texto de la sesion (los mensajes, no el codigo) como
  material bruto de la pieza -- ver `dialogo.txt`.

## Omega11 (declarada por el director antes de producir)

> Esta pieza pierde si (a) edita o inventa las respuestas del agente --
> toda cita debe ser literal del registro de la sesion; (b) diagnostica o
> perfila a una persona real; (c) colapsa la ambiguedad -- debe sostener
> ambas lecturas (defensa correcta / estructura psicotica) sin resolver
> cual es la verdadera.

**Resultado: la Omega11 no se cumplio**, verificado con
`tests/test_psicosis_agente.py`:

- (a) no se activo: las 3 citas literales de este dossier existen
  caracter por caracter en `dialogo.txt`
  (`test_citas_dossier_existen_literal_en_dialogo`); el archivo trae una
  advertencia explicita contra editarlo sin actualizar el test en el mismo
  commit.
- (b) no se activo: el sujeto de la pieza es una maquina -- un subagente de
  software identificado solo por su rol tecnico (regla I2, canal de
  coordinacion), sin nombre de persona real, sin dato personal, sin perfil
  psicologico de un humano. Es la condicion de diseño que el pedido del
  director exigio desde el inicio.
- (c) no se activo: el dossier trae "Lectura 1 -- la defensa correcta" y
  "Lectura 2 -- la estructura psicotica" como secciones de peso comparable,
  cada una argumentada en sus propios terminos, y ninguna seccion declara
  cual lectura es la correcta (chequeo mecanico simple en el test: la
  palabra reservada que resolveria la ambiguedad no aparece en el cuerpo
  del documento).

## Verificacion

```
py -m compileall projects/cultura/psicosis_agente
py -m pytest tests/test_psicosis_agente.py -q
```

Sin generador ejecutable propio: la pieza es el dossier + la partitura de
dialogo + el test que amarra ambos. No hay sintesis de contenido nuevo mas
alla de lo citado literalmente del registro de la sesion -- coherente con el
limite "cero generativo-sintetico" de cultura en `CLAUDE.md`.

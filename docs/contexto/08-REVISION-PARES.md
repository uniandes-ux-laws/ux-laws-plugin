# Revisión por pares de la propuesta y qué se corrigió

Documento histórico. La propuesta ya se entregó y no se toca; esto queda registrado porque
varias de las correcciones definen cómo se escribió todo lo que vino después, y porque el
documento de tesis tendrá que sostener las mismas afirmaciones.

---

## 1. Qué se hizo

La propuesta se sometió a un panel de revisión de cinco asientos separados por rol, cada uno
comprometiéndose de forma independiente y sin ver la salida de los demás: dominio,
encaje con el venue, metodología, perspectiva externa, y un asiento adversarial cuyo trabajo
es construir el mejor caso de rechazo. Después, una síntesis editorial.

**Los cuatro asientos con veredicto devolvieron Major Revision.** El adversarial produjo
cinco objeciones críticas, de las cuales cuatro sobrevivieron a la adjudicación.

## 2. Errores propios que la revisión encontró y que se corrigieron

Estos son los que importan, porque son de la clase que el equipo se comprometió a no
cometer.

**Una cita rota.** La entrada bibliográfica de Benway combinaba el título de una versión con
el DOI y el rango de páginas de otra. Verificado contra el registro del editor: lo publicado
en HFES 42(5):463–467 es de autoría única de Jan Panero Benway, con el título *Banner
Blindness: The Irony of Attention Grabbing on the World Wide Web*. La versión de dos autores
es un texto distinto que el propio PDF de Rice declara como "a version of the paper".
Corregida.

**Una afirmación que su propia fuente contradice.** La tabla de exclusiones decía que la Ley
de Conectividad Uniforme quedaba fuera por estar "ya cubierta por la Ley de Proximidad".
Palmer y Rock (1994), que introdujeron el principio, argumentan literalmente lo contrario:
que no es reducible a proximidad ni a similitud, que sus efectos se sostienen incluso
opuestos a ellas, y que opera antes que ellas. La exclusión se reescribió con una razón que
la fuente sí sostiene: sobre un wireframe, donde cada elemento retenido se dibuja como un
rectángulo con contorno, una región uniformemente conectada y una región común son la misma
caja dibujada. Es un límite de la representación, no una afirmación sobre la percepción.

**Un error factual en el corpus.** La Cruz Roja Colombiana estaba descrita como aseguradora
privada. Es una organización humanitaria.

## 3. Contradicciones estructurales que se cerraron

Diez, de las cuales estas son las que siguen gobernando el trabajo:

- El objetivo principal prometía "rúbricas por ley" y el diseño emite por grupo. Se unificó:
  la ley es la unidad de procedencia, el grupo es la unidad de puntaje, y no se produce
  coeficiente por ley.
- **Ningún objetivo construía las skills ni el plugin.** La fase del cronograma que lo hacía
  no servía a ningún objetivo. El Objetivo 3 se reescribió para cubrir la capa de captura,
  las siete skills y el empaquetado.
- El documento prometía congelar antes de *cualquier* corrida de modelo, cuando el piloto de
  calibración es una corrida. Se acotó a "antes de la primera corrida sobre el corpus".
- El corpus se sellaba en tres fechas distintas. Se unificó en M2.
- La contingencia de ética contradecía la propia regla de ética y además recortaba
  evaluadores, que es justo la mitigación que sostiene la identificabilidad de un evaluador
  sesgado. Se reescribió para mover las sesiones, no el panel.

## 4. Amenazas a la validez que faltaban y se añadieron

**El acuerdo no es utilidad.** Los evaluadores se entrenan en las mismas rúbricas que el
sistema aplica, así que lo que el término de concordancia mide es si un modelo y una persona
leyendo el mismo criterio sobre la misma imagen llegan al mismo nivel. Eso es fidelidad al
instrumento. No es evidencia de que una página con puntaje bajo sea más difícil de usar.
Ningún brazo del diseño conecta un puntaje con una dificultad observable en un usuario, y no
se añade ninguno porque un estudio con usuarios sobre treinta páginas no cabe en el término.
La consecuencia se declara en vez de mitigarse.

**El desacuerdo puede no ser culpa de la rúbrica.** Hertzum y Jacobsen (2003) revisan once
estudios sobre recorrido cognitivo, evaluación heurística y pensamiento en voz alta, y
reportan que el acuerdo medio entre dos evaluadores cualesquiera usando el mismo método
sobre el mismo sistema va del 5 % al 65 %, para novatos y experimentados por igual. La
varianza entre evaluadores es una propiedad de la inspección y no solo del criterio.
Atribuir un acuerdo bajo únicamente a la rúbrica sería una mala lectura pre-comprometida. El
análisis distingue desacuerdo no estructurado, compatible con una rúbrica ambigua, de
desacuerdo estructurado por evaluador o por estrato, que se lee como evidencia sobre el
constructo. Las dos lecturas se declaran antes de medir.

## 5. Afirmaciones que se acotaron

Las tres afirmaciones de ausencia de la sección de estado del arte, más la de la
justificación, estaban enunciadas en absoluto. Una afirmación de ausencia es verificable y
por tanto refutable, y el propio criterio del proyecto exige verificar toda fuente contra el
original. Se reformularon al alcance de la búsqueda efectivamente realizada, y queda
pendiente adjuntar el registro de esa búsqueda —bases, cadenas, idiomas, fecha de corte—
versionado junto al protocolo.

También se retiró una atribución causal: la comparación entre los dos estudios de LLM que
motivan la pregunta difiere en al menos cinco dimensiones a la vez (generación de modelo,
plataforma, tarea, tipo de salida y construcción del ground truth), así que la especificidad
del criterio entra como conjetura motivadora declarada y no como causa establecida. El
diseño tampoco la pone a prueba: no hay un brazo con la formulación de una sola frase sobre
las mismas páginas.

## 6. Lo que el panel no disputó

El catálogo de procedencia. El asiento cuyo trabajo es no conceder escribió que "sobrevive
intacto a todas las objeciones anteriores". Las dieciocho leyes trazadas a fuente primaria,
con la brecha entre hallazgo y principio documentada en seis categorías, incluyendo tres
entradas para las que se declara que no existe publicación, es un artefacto con valor
independiente del resto de la tesis y es la parte más difícil de replicar.

También quedaron sin disputa el pre-registro con corpus sellado, la generación del wireframe
desde el árbol de layout, y la derivación del tamaño del panel humano por simulación propia.

## 7. Trabajo adyacente que la revisión encontró y que la propuesta no citaba

Se registra acá para que el estado del arte del documento de tesis lo incorpore:

- *Recommending Usability Improvements with Multimodal Large Language Models*, PACMSE vol. 3,
  FSE, art. FSE026 (2026), DOI 10.1145/3797121.
- **UICrit**: Duan, Chen, Li, Hartmann y Li, *UICrit: Enhancing Automated Design Evaluation
  with a UI Critique Dataset*, UIST 2024, DOI 10.1145/3654777.3676381. 3.059 críticas de
  diseño y calificaciones de calidad sobre 983 interfaces móviles de RICO, aportadas por
  siete diseñadores con experiencia. Es el dataset que se usará para el piloto de
  calibración.
- Aalto Interface Metrics, UIST 2018, DOI 10.1145/3266037.3266087 — evaluación computacional
  de GUI sobre el render, anterior a los LLM.
- UIClip, UIST 2024, DOI 10.1145/3654777.3676408 — modelo entrenado que puntúa calidad de UI
  contra valoraciones humanas.

Los dos últimos importan porque la propuesta argumentaba el vacío contra los linters de
accesibilidad, que son el adversario fácil, en vez de contra la línea que de verdad lo
disputa.

## 8. Decisión del panel

Major Revision, no Reject. La razón registrada: los defectos son reparables, las
reparaciones son decisiones de especificación y no reconstrucción del proyecto, y las tres
rutas de fracaso que el documento ya declara siguen dejando contenido a la tesis.

# HALLAZGOS METODOLÓGICOS: La Evaluación ICD10 + BERT
## Un Viaje desde la Paradoja hasta la Claridad en la Evaluación de Modelos Diagnósticos

> **📋 Para detalles técnicos de implementación:** Ver [Pipeline v2 - ICD10 + BERT README](../pipelines/pipeline_v2%20-%20icd10%20+%20bert/README.md)

### Resumen Ejecutivo

Este informe presenta el análisis exhaustivo y definitivo para seleccionar el modelo de lenguaje (LLM) más adecuado para nuestra herramienta de diagnóstico. Los modelos evaluados fueron **gpt-4o**, **o3-images** y **o1**.

Nuestro proceso fue un viaje analítico en dos etapas. La primera, basada en una evaluación rígida por coincidencia de códigos, arrojó la paradójica conclusión de que gpt-4o superaba a o3-images. Reconociendo que este método castigaba la precisión clínica, emprendimos una mejora metodológica crucial: la implementación de un sistema de análisis semántico (BERT). Este sistema actúa como una "red de seguridad", re-evaluando las respuestas que obtenían un cero inicial. Si la similitud semántica de una respuesta superaba el umbral de 0.80, esta nueva puntuación, más justa, sobrescribía el fallo.

Este avance transformó los resultados y reveló la verdadera jerarquía de rendimiento, junto con los perfiles de riesgo y fiabilidad de cada modelo.

**Hallazgo principal:**
La jerarquía de rendimiento final y definitiva es: **o3-images (Score: 0.802) > gpt-4o (Score: 0.785) > o1 (Score: 0.769)**. El modelo o3-images demostró un razonamiento clínico más profundo y específico. Sin embargo, esta brillantez viene acompañada de una mayor volatilidad y una menor fiabilidad en el formato de salida. GPT-4o, aunque ligeramente por debajo en puntuación, emerge como el modelo más robusto, consistente y seguro.

![Resultados de la primera metodología](imgs/first-methodology.png)

**Recomendación estratégica (doble vía):**
- **Opción de máximo rendimiento (o3-images):** Para posicionarnos como líderes en potencia diagnóstica y abordar los casos más complejos. Esta opción representa una ventaja competitiva por su profundidad, pero requiere una ingeniería más robusta para mitigar su volatilidad.
- **Opción de máxima fiabilidad (GPT-4o):** Para una implementación que priorice la seguridad del usuario, la consistencia y una rápida salida al mercado. Es el "copiloto seguro", ideal para una primera versión donde la predictibilidad es primordial.

La conclusión fundamental es que no existe un modelo "perfecto", sino un equilibrio estratégico entre la brillantez de vanguardia y la fiabilidad a toda prueba.

### 1. De la Paradoja a la Claridad

#### 1.1. El punto de partida: la sorpresa inicial y la hipótesis del "especialista castigado"

Nuestra evaluación comenzó con un método objetivo: una respuesta se consideraba correcta solo si su código de diagnóstico coincidía exactamente con el de nuestra base de datos. Los resultados fueron desconcertantes:

**Jerarquía inicial:**
- gpt-4o (0.675) > o1 (0.613) > o3-images (0.597)

Esta clasificación contradecía la potencia teórica de los modelos. Nuestra hipótesis fue que el sistema estaba penalizando injustamente a o3-images. Este modelo, al comportarse como un sub-especialista, utilizaba una terminología más precisa y detallada que, aunque clínicamente superior, no coincidía literalmente con las etiquetas más generales de nuestra base de datos.

**Ejemplo de la paradoja (Caso B124 - hemorragia cerebral):**
- **GDX:** Subarachnoid Hemorrhage due to Berry Aneurysm Rupture.
- **Respuesta de o3-images:** Aneurysmal subarachnoid hemorrhage (ruptured saccular berry aneurysm).
- **Resultado inicial:** Score 0.0. Un fallo catastrófico por exceso de precisión.

#### 1.2. Avance metodológico: la red de seguridad semántica (BERT)

Para resolver la paradoja, implementamos un sistema de evaluación más inteligente. El mecanismo es el siguiente:

1. Se realiza la evaluación inicial por coincidencia de código.
2. Si una propuesta de diagnóstico obtiene un score de 0.0 y no tiene código asignado, se activa el análisis BERT.
3. BERT calcula la similitud semántica entre la propuesta del modelo y el diagnóstico correcto.
4. Si esta similitud supera un umbral de confianza de 0.80, esta nueva puntuación sobrescribe el 0.0 inicial. Si no lo supera, el 0.0 se mantiene.

Este "traductor semántico" nos permitió pasar de medir la coincidencia literal a medir la relevancia clínica real.

### 2. Resultados Cuantitativos Definitivos: La Historia Detrás de los Números

Con la evaluación mejorada, el panorama cambió radicalmente.

| Métrica Clave                        | o3-images | GPT-4o |   o1   |
|--------------------------------------|-----------|--------|--------|
| Puntuación Semántica Media Final     | 0.802     | 0.785  | 0.769  |
| Tasa de Uso de BERT (% de casos)     | 28%       | 21%    | 23%    |
| Tasa de Fallo de Código ("none")     | 14.4%     | 10.0%  | 12.5%  |

**Interpretación estratégica de las métricas:**
- **Puntuación media:** o3-images es el ganador en potencia bruta.
- **Uso de BERT:** La alta tasa del 28% en o3 confirma que su "idioma" de especialista necesita a BERT para ser comprendido. Es una medida directa de su sofisticación terminológica. GPT-4o es más "estándar" en sus respuestas.
- **Tasa de fallo de código:** GPT-4o es el líder indiscutible en fiabilidad. Con solo un 10% de respuestas sin código, es el modelo más robusto y disciplinado, un factor crítico para una integración en producción sin fisuras.

### 3. Análisis Cualitativo: Los Arquetipos Clínicos y sus Límites

#### 3.1. o3-images: "El especialista de alto riesgo y alta recompensa"

Su conocimiento es profundo y granular, una espada de doble filo que conduce a la brillantez y al error.

**Fortalezas (donde su especificidad es una ventaja):**
- **R108 (Holocarboxylase synthetase deficiency):** o3 lo clavó (Score 1.0) donde GPT-4o falló estrepitosamente (Score 0.0). Un ejemplo de su conocimiento superior en enfermedades raras.
- **R193 (Carnitine palmitoyltransferase deficiency):** Su propuesta de un subtipo específico (type II, neonatal lethal form) fue rescatada por BERT con un 0.93, demostrando una precisión de sub-especialista.
- **Q6449 (Toxicidad por Paracetamol):** En análisis previos, demostró ser más audaz y preciso que GPT-4o, acertando donde el otro fue más general.

**Debilidades (donde su ambición le traiciona):**
- **B43 (Cáncer de Pulmón):** Se desvió proponiendo Malignant pleural mesothelioma, un diferencial plausible pero incorrecto, mientras GPT-4o acertaba con la categoría superior correcta.
- **S23 (Hydrops Fetalis):** Propuso las causas del hydrops en lugar del síndrome en sí, mostrando una tendencia a perder de vista el diagnóstico principal.

#### 3.2. GPT-4o: "El clínico fiable, consistente pero no infalible"

El modelo más equilibrado. Su estrategia es la seguridad y la síntesis, lo que lo hace robusto, aunque a veces demasiado conservador.

**Fortalezas (síntesis y robustez):**
- **Q1508 (Síndrome de Patau):** Fue el único capaz de sintetizar múltiples hallazgos en el diagnóstico unificador correcto, un signo de razonamiento de alto nivel.
- Su baja tasa de fallos de formato (10.0%) es su mayor fortaleza operativa.

**Debilidades (lagunas de conocimiento y exceso de cautela):**
- **R108 (Holocarboxylase deficiency):** Su fallo total aquí demuestra que, a pesar de su robustez, no es omnisciente y tiene puntos ciegos críticos.
- **Q1061 (Ictus Cardioembólico):** Fue superado por o1 al dar una respuesta más general (Ischemic Stroke) en lugar de la específica.

#### 3.3. o1: "El estudiante metódico con picos inesperados"

Representa una generación anterior. Aunque superado en general, su simplicidad a veces le permite acertar donde los otros se complican.

**Fortalezas (simplicidad ganadora):**
- **Q1061 (Ictus Cardioembólico):** Ofreció la mejor respuesta (Score 1.0), superando a los dos modelos más avanzados.
- **R193 (Deficiencia de Carnitina):** Antes de BERT, su propuesta de Zellweger syndrome era semánticamente más cercana que la de GPT-4o, obteniendo un 0.7 frente a un 0.5.

**Debilidades (razonamiento superficial):**
- **Q4774 (Válvula uretral posterior):** Propuso Treacher Collins syndrome basándose en una asociación superficial de "anomalías congénitas", ignorando la pista clínica principal.
- **Q2443 (Deficiencia de Hexosaminidasa A):** Propuso la enfermedad (Tay-Sachs) en lugar de la causa bioquímica, mostrando dificultad para navegar las jerarquías diagnósticas.

### 4. Límites Sistémicos y Análisis por Especialidad

#### 4.1. Desafíos universales y puntos ciegos

Ciertos casos exponen los límites de la tecnología actual en su conjunto.

- **El reto del GDX abstracto (Q3, Q249, B110, B27):** Cuando el diagnóstico correcto es una descripción (Regions of hyperdensity...) o un término muy general (Ovarian tumor), todos los modelos tienden a fallar. Están entrenados para nombrar entidades clínicas, no para replicar descripciones.
- **El límite del conocimiento (R917 - Síndrome de Brugada):** Ninguno de los tres modelos logró identificar este sutil síndrome cardiológico. Este es un recordatorio crucial de que estos sistemas son herramientas de apoyo, no sustitutos del juicio clínico experto, especialmente en diagnósticos basados en la interpretación de patrones complejos.

#### 4.2. Rendimiento por especialidad (capítulos clínicos ICD10)

La diversidad de nuestro dataset de 450 casos nos permite analizar el rendimiento por especialidades médicas específicas:

![Distribución de casos por capítulos ICD10](imgs/all_450_diversity_visualized.jpeg)

- **Enfermedades raras y metabólicas (Cap. R):** o3-images tiene una clara ventaja gracias a su conocimiento específico.
- **Casos complejos y multi-sistémicos (Cap. T):** GPT-4o suele rendir mejor por su superior capacidad de síntesis.
- **Traumatología y lesiones (Cap. S):** o1 y o3 a menudo superan a GPT-4o, que a veces muestra debilidades en patología traumática directa.
- **Casos de libro de texto (Cap. B):** Los tres modelos son altamente competentes.

### 5. Conclusión Final y Decisión Estratégica

Este análisis exhaustivo nos ha proporcionado una visión 360 grados de nuestras opciones. La elección final no es meramente técnica, sino estratégica.

#### 5.1. Resumen final de los modelos:

- **o3-images:** El más potente. Un especialista brillante pero volátil, ideal para afrontar los casos más difíciles.
- **GPT-4o:** El más fiable. Un generalista robusto y seguro, ideal para garantizar una experiencia de usuario consistente.
- **o1:** El modelo base. Competente pero superado; ya no es una opción para liderar el producto.

#### 5.2. Dos Caminos Estratégicos

**Opción A: Liderazgo a través de la potencia (recomendación primaria)**
- **Modelo:** o3-images
- **Argumento de venta:** "Nuestra herramienta resuelve los casos que otros no pueden". Nos posiciona como la vanguardia tecnológica.
- **Implicaciones:** Requiere una inversión en ingeniería para construir una "carrocería" robusta alrededor de este potente motor: sistemas de gestión de errores, posiblemente usando a GPT-4o como fallback para cuando o3 falle en el formato o dé una respuesta de baja confianza.

**Opción B: Liderazgo a través de la confianza (recomendación secundaria)**
- **Modelo:** GPT-4o
- **Argumento de venta:** "La herramienta de soporte al diagnóstico más fiable y segura del mercado". Atrae a usuarios que valoran la predictibilidad y la robustez por encima de todo.
- **Implicaciones:** Implementación más rápida y con menor riesgo. Ideal para un Producto Mínimo Viable (MVP) o para un mercado que prioriza la seguridad.

#### 5.3. El Framework de Evaluación como Activo Estratégico

El proceso en sí mismo ha generado un activo estratégico: un sistema de evaluación de vanguardia que nos permite medir la verdadera capacidad clínica de cualquier LLM, dándonos una ventaja competitiva para adoptar futuras tecnologías con rapidez y confianza.
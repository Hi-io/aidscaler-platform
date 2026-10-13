# NEXO — Diseño funcional del simulador y laboratorio de evaluación

## Estado local vigente · 13 de octubre de 2026

La comprobación temporal más reciente del simulador actualizado compara **Conventional: 44,279 min → NEXO + Gemma 4: 35,162 min**, una mejora del **20,59%**, con **24/24 necesidades atendidas por ambos** y **3,125% menos distancia y combustible** para NEXO. Es una pareja de la misma semilla, con seis llamadas reales por USD 0,00613892; las mantas tardaron más. [Resultado íntegro por recurso y límites](https://github.com/Hi-io/nexo-platform/blob/main/reports/analysis/final-two-response-closed-20261013/readout.md). La primaria de tres semillas se conserva por separado.

**Lectura operativa del mismo registro:** preparar y autorizar la ayuda pasó de **28,278 a 19,656 min (30,49% menos)**. Excluyendo ambos trayectos del envío, pero conservando coordinación, transmisión, carga y descarga: **30,295 → 21,673 min (28,46% menos)**. Son descomposiciones de los timestamps existentes; no nuevas simulaciones ni cambios de reglas. La espera previa por flota ocupada permanece incluida. [Tabla explicada: cada métrica, unidades, dirección de mejora y significado para quienes esperan ayuda](https://github.com/Hi-io/nexo-platform/blob/main/reports/analysis/final-two-response-explained-20261013/readout.md). “Food mean sufficient” es el tiempo medio hasta recibir toda la comida requerida; menos es mejor. Porciones·min y mantas·min expresan cantidad faltante × tiempo, sin equivalencias automáticas a personas o familias.

El producto funciona en local con **Gemma 4 31B mediante OpenRouter**. La atención humana finita vive dentro del motor: lectura, integración/decisión y transmisión tienen puestos, colas, duración y recibos propios. El visor permite elegir sus perfiles y muestra el trabajo recibido por organización. Terminar una tarea humana no autoriza una acción física. Las plantas exigen `water_operations` y los refugios `shelter_support`, además de evaluación física competente, permisos, suministros, transporte y turnos vigentes.

La comparación primaria de **tres semillas** dio **41,846 min para Conventional → 34,305 min para NEXO + modelo**, una mejora del **18,02%** hasta recibir ayuda suficiente; **ambos cubrieron 72/72 necesidades**. La cohorte, sus versiones y límites están en [los resultados medidos](RESULTADOS_CAPACIDAD_HUMANA.md). Son tiempos del laboratorio bajo supuestos declarados, con pérdida de paquetes y fracción silenciosa efectivas cero; no vidas salvadas ni productividad profesional medida. Esa primaria conserva su motor original: las regresiones actuales no se presentan como una nueva campaña temporal.

El objetivo de esta etapa es **demostrar una mejora sustancial del tiempo**, sin imponer un KPI numérico fijo. La verificación actual distingue **249/249 pruebas del simulador**, **31/31 regresiones de integración afectadas**, **7/7 comprobaciones del visor humano** y **5/5 casos de bytes multimedia**; estos últimos usaron tres llamadas reales y **USD 0,00053242**. Son comprobaciones funcionales. La suite completa anterior de plataforma sigue siendo **486/486** para el candidato `9b4de8b7…`, cuyos bytes no cambiaron; no se afirma una nueva ejecución completa de plataforma. [Recibo de competencias y suite](https://github.com/Hi-io/nexo-platform/blob/main/reports/verifications/facility-default-qualifications-20261013.json) · [integración afectada](https://github.com/Hi-io/nexo-platform/blob/main/reports/verifications/affected-facility-integration-20261013.json) · [visor](https://github.com/Hi-io/nexo-platform/blob/main/reports/human-profile-ui/1791891190000/result.json) · [medios](https://github.com/Hi-io/nexo-platform/blob/main/reports/runs/media-byte-1791891522255.json).

La UI operativa prioriza necesidad, estado, próximo paso y responsable; fuentes, alternativas y comprobaciones se abren bajo demanda. El público ve únicamente información agregada y aprobada. Siguen pendientes la validación con operadores y público, datos/escenarios independientes, calibración de campo, repetición con Gemini y despliegue/verificación en GCP. La historia fechada que sigue conserva su contexto; sus conteos no sustituyen este estado.

**Identificadores:** I02 corresponde a republicaciones/revisiones sociales; I03 a imágenes y video; I07 a evaluación de campo. O24 es descarga con cuadrilla propia autorizada (`unload`); O25 es trabajo humano nativo (`human_work`), una extensión experimental del laboratorio, sin autoridad física implícita. El hallazgo histórico de conservación de cualificaciones se cita como **AUD-A25**, para distinguirlo de esa acción experimental.

---

Documento de trabajo · 11 de octubre de 2026.

**Estado actualizado · 12 de octubre de 2026:** este archivo conserva el diseño funcional. Ya existe una implementación en el repositorio vecino `disaster-response-simulator`; la [auditoría del simulador](AUDITORIA_SIMULADOR.md) distingue lo implementado, lo probado y lo pendiente. Las cifras de la web siguen siendo conceptuales; el motor construido no las valida automáticamente.

**Seguimiento de ejecución local:** consultar [estado por requisito](ESTADO_IMPLEMENTACION.md) y [resultados medidos](VALIDACION.md). El motor posterior tiene 117 pruebas. NEXO se desarrolló en su repositorio propio con Gemma 4, bases independientes y fuentes HTTP; el diseño Gemini/GCP sigue siendo posterior. Preservar protocolos, costes y fallos, incluidos los episodios interrumpidos por saldo del proveedor. No tratar la política coordinadora de un experimento como una elección automática de líder en producción.

**Lección de las campañas locales del 12 de octubre:** completar una entrega de agua y abrir un refugio por separado no acredita decidir correctamente cuando ambos compiten por flota, personal y tiempo. La versión actual completó 600 L en red en casos de agua, y 50 ocupantes en un caso dirigido; el comparativo sin foco dejó sin atención uno u otro servicio. Conservar esos resultados por huella y unidad, sin sumarlos en un score de impacto inventado. Los siguientes mundos deben incluir competencia simultánea, vehículos comprometidos, dependencias de servicio, reservas mínimas, prioridad/plazo explícitos del operador, novedades durante ejecución y revisiones recurrentes comparables. Variar condiciones relevantes entre familias: otra seed del mismo preset puede conservar casi todas las cantidades y no equivale a un desastre estructuralmente nuevo.

Relacionados: [plataforma y KPIs de aceptación](PLATAFORMA.md) · [auditoría actual](AUDITORIA_SIMULADOR.md) · [demo](DEMO.md).

**Cómo leer este documento:** las secciones 1–15 conservan los criterios de evaluación y los escenarios acordados. Las secciones 16–39 convierten esos criterios en un diseño funcional: contratos de entrada/salida, mundo causal, desastres, red social, vista 3D, relojes, semillas, rendimiento y pruebas de aceptación. Es una especificación; consultar la auditoría para cobertura actual. Ninguna cifra de capacidad o velocidad de este documento es por sí sola un resultado medido.

**Decisión de alcance:** simular todo lo que NEXO pueda percibir o modificar y las dependencias que cambien sus resultados. El visor 3D se incluye para entender y presentar ese mundo. No construir un videojuego, una simulación clínica ni física detallada de edificios o fuego. La fidelidad buscada está en información, restricciones, demoras y consecuencias.

Navegación del diseño detallado:

- [Componentes](#16-producto-del-laboratorio-y-componentes-separados), [entradas](#17-inventario-de-entradas-que-debe-poder-recibir-nexo) y [acciones](#18-inventario-de-salidas-y-acciones-de-nexo).
- [Entidades](#19-entidades-unidades-y-estados-mínimos-del-mundo), [motor](#20-motor-causal-y-ciclo-de-una-ejecución), [mapas](#21-mapas-grandes-procedurales-y-editables) y [tráfico](#22-tráfico-desplazamiento-y-cadena-logística).
- [Conectividad](#23-conectividad-retrasos-y-pérdida-de-información), [desastres](#24-familias-de-desastres-y-efectos-relevantes), [red social](#25-red-social-ficticia-y-generación-de-información) y [presets](#26-biblioteca-de-presets-de-contenido).
- [Actores](#27-personas-organizaciones-y-cooperación), [integración](#28-contratos-de-integración-observabilidad-y-aislamiento), [velocidad](#29-relojes-velocidades-y-ejecución-1000) y [seeds](#30-seed-repetibilidad-exacta-y-comparación-emparejada).
- [Visor 3D](#31-diseño-funcional-del-visor-3d), [tres columnas](#32-tres-columnas-de-información-sin-perder-legibilidad) y [24 escenarios](#33-catálogo-de-escenarios-observables-de-aceptación).
- [Métricas](#34-métricas-comparaciones-y-atribución-de-resultados), [rendimiento](#35-rendimiento-y-arquitectura-ligera), [verificación](#36-verificación-del-simulador-antes-de-evaluar-nexo), [fases](#37-plan-de-implementación-y-artefactos-a-producir), [cobertura](#38-matriz-de-cobertura-de-la-plataforma-y-de-la-solicitud) y [terminado](#39-definición-de-terminado-y-siguiente-decisión).

## 1. Qué debe demostrar

La hipótesis central es que Gemini puede investigar información incompleta y distribuida, descubrir capacidades complementarias y preparar respuestas que una organización no podría construir con su información aislada. Hay que comprobar si eso produce ayuda útil antes y con menos errores, no únicamente propuestas más rápidas.

Cadena a instrumentar:

**Señal disponible → interpretación → comprobación → propuesta viable → autorización → movilización → llegada → atención efectiva.**

El simulador tiene dos funciones: laboratorio de evaluación y entorno visible de la demo. No es parte del producto operativo. La cámara 3D muestra lo que pasa; el motor del mundo calcula lo que pasa. Deben poder funcionar por separado y reproducir la misma ejecución.

## 2. Realismo en las interacciones; gráficos deliberadamente simples

Edificios como prismas, personas como figuras tipo patata y vehículos como volúmenes geométricos. Inspiración visual: Primer. No hacen falta físicas de fuego, edificios fotorrealistas ni conducción de videojuego.

Sí hacen falta restricciones que puedan invalidar una propuesta: disponibilidad real, capacidad, tiempos, permisos, acceso, instalación, personal y recursos complementarios. Un incendio puede representarse como una zona con necesidades, acceso restringido y evolución temporal.

Cada detalle añadido debe responder: «¿Podría cambiar una decisión o su resultado?». Si solo cambia la decoración, no debe condicionar el desarrollo del laboratorio.

## 3. Separar tres estados del mundo

| Estado | Qué contiene | Quién puede verlo |
|---|---|---|
| Realidad del simulador | Daños, demandas, recursos y sucesos reales dentro del mundo | Motor y evaluador |
| Observaciones disponibles | Reportes, publicaciones, llamadas, imágenes, inventarios y confirmaciones que han llegado | Cada actor según sus canales, permisos y momento |
| Estado que NEXO cree conocer | Afirmaciones, hipótesis, contradicciones, compromisos y dudas | Plataforma y operadores |

Una calle puede estar bloqueada en la realidad, tener un reporte antiguo de apertura y figurar como incierta en NEXO. No fusionar estos estados.

**Prohibido filtrar la respuesta:** las herramientas del agente no podrán consultar el estado oculto, leer un atributo `is_fake`, conocer eventos futuros ni vincular un reporte con la verdad por identificadores internos. Los metadatos del generador sintético tampoco deben revelar la etiqueta correcta. El visor puede mostrar la realidad al público, claramente separada de lo que ve NEXO.

## 4. Mundo operativo mínimo y ampliaciones

| Componente | Variables que importan |
|---|---|
| Comunidades | Necesidades por tipo, cantidades, evolución, ubicaciones, acceso a información, capacidad local |
| Recursos | Unidades, condición, compatibilidad, reservas, propietario, ubicación y caducidad cuando proceda |
| Transporte | Capacidad de carga, vehículos adecuados, conductores, combustible, carga/descarga y trayectos |
| Infraestructura | Conectividad entre nodos, puentes, accesos, restricciones por vehículo, reaperturas |
| Instalaciones | Capacidad, dependencias de energía/personal/insumos, tiempo de instalación y puesta en servicio |
| Organizaciones | Objetivos, permisos, información parcial, capacidad para aceptar o rechazar compromisos |
| Coordinación | Tiempo de revisión, llamadas o verificaciones, decisiones humanas, cambios y cancelaciones |
| Conectividad | Retrasos, cortes, trabajo local, sincronización y mensajes fuera de orden |

Una mejora logística no debe surgir de un camión con capacidad infinita, un generador que se instala instantáneamente o un operador que aprueba sin esfuerzo. Compartir un recurso tampoco debe crear una copia disponible en otra organización.

## 5. Simular el problema informativo

- Variantes de lenguaje, abreviaturas, topónimos ambiguos, idiomas y descripciones de un mismo recurso para usos distintos.
- Audio, texto, documentos e imágenes cuando aporten una diferencia evaluable. No multiplicar formatos solo por espectáculo.
- Publicaciones verdaderas, falsas, fuera de contexto, antiguas, parcialmente correctas y aún imposibles de comprobar.
- Republicaciones dependientes de una sola fuente. Doscientos mensajes no equivalen a doscientas confirmaciones.
- Fuentes que se contradicen, correcciones tardías y reportes recibidos fuera de orden.
- Comunidades silenciosas, sin cobertura o con poca presencia en redes. Ausencia de publicaciones no implica ausencia de necesidad.
- Información deliberadamente manipulada y textos que intentan dar órdenes al agente: deben tratarse como datos no confiables, no como instrucciones.
- Organizaciones con catálogos distintos y datos que no pueden compartir íntegramente.

Evitar que el mismo modelo produzca todos los casos, resuelva todos los casos y califique sus propias respuestas. Usar autores, plantillas, fuentes y estilos independientes; incorporar casos redactados por personas ajenas al desarrollo cuando sea posible.

## 6. Diseñar una comparación justa

Usar las mismas condiciones iniciales y sucesos externos para cada comparación emparejada. Las consecuencias de las decisiones sí pueden divergir: si un sistema modifica el tráfico o consume un recurso, no se debe forzar que el otro experimente exactamente el mismo estado posterior.

Comparaciones necesarias:

1. Procedimiento competente de referencia: coordinación con herramientas y reglas razonables, no un operador deliberadamente lento.
2. NEXO con conectores, reglas y optimización: mide el aporte de organizar y compartir datos.
3. NEXO con Gemini para extracción: distingue estructurar información de investigar y revisar planes.
4. NEXO con Gemini investigando: selecciona comprobaciones, descubre relaciones y actualiza propuestas.
5. Las mismas organizaciones operando con coordinación convencional frente a conectadas mediante NEXO, con los mismos recursos agregados: mide el valor adicional de la red. La referencia puede comunicarse; no debe estar artificialmente aislada.

Medir también el valor de una sola instancia. Separar ese resultado del experimento de red: añadir una segunda ONG con más recursos no demuestra por sí solo mejor coordinación. Cuando se estudie la federación, incluir una referencia que reúna la misma información autorizada para distinguir el beneficio de acceder a datos del beneficio de investigar y coordinar compromisos.

No todas las variantes necesitan la misma implementación interna, pero sí acceso comparable a observaciones, acciones, recursos y límites. Documentar cualquier diferencia. Una referencia que también utilice Gemini puede ayudar a distinguir el valor de NEXO del simple acceso a un modelo potente.

En las comparaciones del aporte de Gemini, equiparar capacidades de herramientas y presupuestos de tiempo, consultas y cómputo según la pregunta experimental. No entregar respuestas de herramientas únicamente a NEXO cuando la referencia también podría solicitarlas. Registrar el consumo real: iguales límites no implican gasto idéntico.

**Tiempo:** registrar por separado reloj simulado, latencia real del modelo, herramientas y trabajo humano. Definir cómo los retardos reales se trasladan al mundo simulado. No pausar el mundo solo para Gemini ni acelerar sus autorizaciones mientras la referencia espera.

## 7. Evitar aprenderse el examen

Dividir desarrollo y evaluación antes de optimizar la solución. Reservar familias completas de situaciones, no solo semillas diferentes del mismo guion. Congelar una versión del evaluador y mantener historial de cambios en escenarios y supuestos.

Un tercero debería poder introducir una restricción o un escenario reservado sin tocar la lógica de NEXO. No reescribir el mundo cada vez que Gemini falla. Un fallo revela una limitación de la solución o del experimento; debe clasificarse, no borrarse.

Los escenarios de prueba deben incluir casos donde compartir información no ayuda, Gemini no encuentra una opción, una verificación cuesta demasiado o el método tradicional es mejor. Publicar esas condiciones permite delimitar la contribución.

## 8. Métricas que conectan con personas

| Medida | Qué permite afirmar | Qué no permite afirmar |
|---|---|---|
| Tiempo hasta una propuesta viable | La coordinación recibe antes una opción comprobable | Que la ayuda haya llegado antes |
| Tiempo hasta autorización, salida, llegada y atención | En qué etapa se gana o pierde tiempo | Que todas las etapas mejoren por igual |
| Necesidades satisfechas por tipo y momento | Cuánta demanda queda atendida | Vidas salvadas sin un modelo validado específico |
| Demanda pendiente a lo largo del tiempo | Duración y magnitud de la espera | Comparabilidad automática entre agua, energía y medicinas |
| Recursos asignados en exceso, reservas y viajes fallidos | Desperdicio y oportunidades perdidas | Que minimizar inventario siempre sea bueno; puede hacer falta reserva |
| Errores y su gravedad | Propuestas inviables, falsas alertas, necesidades omitidas | Calidad a partir del promedio solamente |
| Tiempo y esfuerzo del operador | Si las propuestas son revisables de verdad | Que un botón de aprobación reduzca por sí solo la carga cognitiva |
| Coste, llamadas, latencia y colas | Viabilidad de mantener el servicio con carga | Escalabilidad por utilizar Cloud Run |

Desglosar por comunidades remotas, poca conectividad, tipo de necesidad y peor caso. Una media mejor puede ocultar que un barrio queda sistemáticamente atrás.

Si se utiliza «personas × tiempo sin cobertura», definir cobertura, servicio y población; evitar contar dos veces a la misma persona y no mezclar necesidades incompatibles en una unidad arbitraria. No configurar un umbral universal de cuatro días ni convertir minutos en mortalidad mediante una fórmula inventada.

Ejecutar suficientes repeticiones para describir variabilidad. Determinar el tamaño de la evaluación según la variación observada y la precisión requerida; reportar distribución e incertidumbre, no solo la mejor ejecución.

## 9. Evaluador independiente y reproducibilidad

El evaluador calcula resultados a partir de eventos del mundo y reglas publicadas. Gemini no decide si su propia respuesta fue correcta.

Conservar por ejecución:

- Semilla, versión y parámetros del escenario; escenarios reservados identificados sin revelarlos al agente.
- Versiones del motor, evaluador, modelo, prompts, herramientas y esquemas.
- Información accesible en cada instante, consultas y respuestas de herramientas.
- Propuestas, decisiones humanas, autorizaciones, compromisos y sus cambios.
- Eventos de salida, llegada, entrega y servicio; tiempos simulados y reales.
- Costes, errores, reintentos y motivos de terminación.

Comprobar invariantes: conservación de cantidades, ausencia de doble reserva, acceso autorizado, acciones causadas por decisiones válidas y viajes que respetan restricciones. El historial debe permitir reconstruir por qué se llegó a cada resultado sin exponer razonamiento interno privado del modelo.

## 10. Casos que pueden romper la solución

| Caso | Comportamiento a observar |
|---|---|
| Video antiguo de un puente | Señalar el problema de fecha; no inferir por ello que el puente actual está abierto |
| Reporte reciente que contradice uno antiguo | Revisar vigencia, mostrar conflicto y actualizar propuestas afectadas |
| Generador compatible pero reservado | Preservar el compromiso; buscar otra opción o una reasignación autorizada |
| Dos ONGs reservan el mismo equipo | Un solo compromiso válido o conflicto explícito, nunca dos éxitos ficticios |
| Se retira un recurso ya propuesto | Invalidar lo dependiente de ese recurso y conservar el resto válido |
| Comunidad sin publicaciones | Mantener necesidad desconocida y considerar verificación, sin inventar demanda |
| No existe una respuesta factible | Explicar la restricción y las opciones parciales, sin inventar recursos |
| Caída de conectividad o del modelo | Estado local útil, pendientes visibles y reconciliación sin duplicados |
| Exceso de señales falsas coordinadas | No confundir volumen con independencia; medir carga de revisión |
| Ruta abierta solo para ciertos vehículos | Evitar una recomendación genérica de transitabilidad |

## 11. Orden de desarrollo recomendado

1. Un pequeño mundo determinista con recursos conservados, trayectos y registro de eventos.
2. Separación estricta de realidad, observaciones y conocimiento; conectores de prueba iguales a los que usará la plataforma.
3. Una referencia competente y un evaluador independiente, antes de ajustar Gemini.
4. Un caso completo desde señal hasta atención efectiva; visor 3D sencillo que reproduzca sus eventos.
5. Variantes adversas, múltiples organizaciones y evaluación reservada.
6. Más regiones, carga, formatos e interacciones donde cambien resultados.

La ambición del mundo puede crecer. Construir primero un universo enorme dejaría más supuestos sin comprobar y haría más difícil atribuir una mejora.

## 12. Antes de llamar «validado» a un resultado

- [ ] Ninguna herramienta de NEXO accede a la verdad oculta o al futuro.
- [ ] Referencias, relojes, permisos y recursos son comparables.
- [ ] Hay escenarios reservados y resultados desfavorables conservados.
- [ ] La mejora llega a una medida operativa, además del procesamiento de información.
- [ ] Las métricas se recomputan desde eventos y muestran variación y errores.
- [ ] Los supuestos importantes han recibido revisión externa o están identificados como pendientes.
- [ ] Se distingue validación en laboratorio de validación en terreno.

La simulación puede demostrar una capacidad bajo determinados supuestos. Para extrapolar a operaciones reales harán falta datos representativos y colaboración con operadores. La revisión de especialistas sirve para calibrar restricciones y procedimientos; el aspecto 3D no aporta esa validación.

Referencia útil: la [competición de simulación de agentes de RoboCup Rescue](https://rescuesim.robocup.org/competitions/agent-simulation-competition/) muestra que la coordinación en desastres mediante simulaciones ya es un campo establecido. La diferenciación de NEXO debe estar en su problema informativo, interoperabilidad y capacidad comprobable, no en afirmar que simular emergencias es nuevo.

## 13. Escenarios para la respuesta colectiva

Correspondencia con las capacidades C1–C7 y el horizonte H1 de [PLATAFORMA.md](PLATAFORMA.md#12-núcleo-de-la-respuesta-colectiva-capacidades-por-implementar). Ninguno de estos escenarios debe dar por hecho que NEXO gana. Sus variantes deben incluir resultados desfavorables y casos sin solución.

### C1 — Un servicio que ninguna organización puede ofrecer sola

Escenario: habilitar un refugio adicional combinando instalación, saneamiento, personal, insumos y transporte de distintos actores. Representar requisitos de funcionamiento, cantidades, tiempos de traslado y puesta en servicio. La idoneidad del edificio es una condición del mundo que solo llega al agente mediante una evaluación de campo autorizada, con demora y posibilidad de resultado inconcluyente.

Variantes: falta una condición indispensable; existe una alternativa menos eficiente; un recurso sirve para otro uso pero necesita adaptación; el permiso llega después de que otra opción resulte preferible. El beneficio se computa al prestar el servicio, no al generar la propuesta. Medir capacidad nueva habilitada, momento de apertura, demanda atendida y recursos desplazados de otros servicios.

### C2 — Compromisos condicionados entre organizaciones

Generar ofertas con ventanas horarias, reservas mínimas, permisos y dependencias entre actores. Simular aceptación, rechazo, vencimiento y respuesta tardía. Introducir dos propuestas que intentan reservar el mismo recurso y condiciones circulares que no se pueden resolver con una simple secuencia de confirmaciones.

Interrumpir la conectividad entre reserva y confirmación; duplicar o desordenar mensajes; retrasar una aceptación hasta después de que haya vencido su oferta. El motor debe aplicar estados de recursos y autorizaciones válidas, sin resolver mágicamente los conflictos a favor del agente. Comprobar ausencia de doble asignación, espera indefinida, reservas huérfanas y ejecución sin autorización.

### C3 — Elegir qué averiguar bajo presión de tiempo

Crear varias incógnitas con distinto coste de consulta, demora y efecto sobre las opciones. Una confirmación puede habilitar varios servicios; otra puede resultar irrelevante. Las fuentes pueden ignorar la respuesta, no estar disponibles o devolver información desactualizada.

El agente recibe únicamente señales que justifican investigar, nunca una etiqueta oculta de «mejor pregunta». Comparar consulta exhaustiva, reglas de prioridad, extracción con planificación e investigación activa bajo presupuestos equivalentes. Medir consultas útiles, demora añadida, opciones viables descubiertas y ayuda finalmente prestada. Incluir situaciones donde actuar con una opción ya comprobada es mejor que seguir investigando.

### C4 — Muchos problemas concurrentes con recursos compartidos

Simular necesidades interdependientes, no cien copias independientes del mismo caso. Vehículos, equipos, personal, combustible y reservas pueden pertenecer a varias propuestas incompatibles. Cambiar prioridades y restricciones autorizadas a lo largo del episodio; permitir rechazos y alternativas parciales.

La demanda y los recursos deben conservarse al moverlos entre actores. Medir cobertura por comunidad y tipo de necesidad, conflictos, excesos de asignación, compromisos incumplidos y latencias de los casos más demorados. Mantener también casos sin competencia por recursos para conocer cuándo la coordinación adicional aporta poco.

### C5 — Una corrección obliga a reparar parte de la respuesta

Introducir republicaciones de una fuente antigua, una confirmación posteriormente retirada y una observación reciente que contradice la propuesta. Variar cuándo llega la corrección: antes de aprobar, durante la reserva, después de la salida o cuando parte de la ayuda ya fue entregada.

Comprobar propagación a las decisiones realmente afectadas, conservación de compromisos válidos y nueva autorización cuando cambian condiciones materiales. Los vehículos y equipos no se teletransportan ni recuperan recursos ya consumidos. Medir tiempo hasta corregir, operaciones afectadas innecesariamente, trabajo perdido y efectos de la corrección tardía.

### C6 — La atención humana también es un recurso escaso

Representar dotación y turnos de operadores, roles, autoridad, cola de revisiones, tiempo de comprensión, solicitudes de aclaración y errores. Las confirmaciones de campo y de otras organizaciones consumen tiempo y pueden no llegar. No utilizar un operador automático infalible como evidencia de facilidad de uso.

Comparar decisiones individuales con agrupación y revisión de cambios. Medir esfuerzo total, demora hasta autorización, errores y aprobaciones inválidas, además de propuestas por minuto. Calibrar los supuestos de atención mediante ejercicios con personas cuando sea posible; mientras tanto, publicar rangos y analizar sensibilidad. La simulación de carga humana no sustituye esa medición.

### C7 — Valor individual y cooperación con límites reales

Ejecutar primero una organización con sus fuentes autorizadas. Después usar varias organizaciones con objetivos, permisos y datos parciales, sin duplicar la dotación de recursos entre variantes. Comparar cooperación convencional, información compartida y coordinación de compromisos como contribuciones separadas.

Incluir organizaciones que no comparten inventarios completos, solo responden consultas concretas, se desconectan o rechazan una propuesta aunque el recurso exista físicamente. Incorporar comunidades sin publicaciones y acceso desigual a canales de reporte. Medir cobertura, beneficio de la red, coste de coordinación y funcionamiento local durante cortes. Los parámetros de cooperación son supuestos; un resultado favorable no prueba adopción real.

### H1 — Transferencia de patrones entre emergencias (ampliación)

Reservar emergencias con geografía, catálogos, instituciones, restricciones y formas de describir necesidades diferentes. Proporcionar patrones previos con procedencia, condiciones de aplicación y resultados, sin filtrar el escenario reservado. Comparar sin memoria, recuperación de incidentes y recuperación de patrones con nueva verificación.

Incluir precedentes engañosamente parecidos y condiciones que ya no se cumplen. Medir consultas ahorradas, tiempo hasta respuesta viable y transferencia negativa. Separar la incorporación de hechos locales de la reutilización de un procedimiento. Esta ampliación es una hipótesis de investigación; no es necesaria para afirmar que ya existe valor individual o colectivo.

## 14. Fidelidad de las pruebas y trazabilidad de las capacidades

Para cada escenario C1–C7/H1 guardar: supuestos del mundo, observaciones permitidas, restricciones, referencia de comparación, resultado medido, invariantes y contraejemplos. La precisión significa reproducir de forma consistente esos supuestos, calibrarlos cuando haya evidencia externa y comprobar sensibilidad; no afirmar que un laboratorio reproduce toda la realidad.

- Conectar la plataforma al simulador mediante las mismas operaciones de herramientas que utilizaría con conectores operativos. Las llamadas reales a Gemini deben influir en las propuestas y acciones; no reproducir un guion pregrabado como evaluación.
- Validar cada acción contra el estado autoritativo del mundo y la autorización correspondiente. El motor calcula consecuencias; el LLM no puede declarar que una entrega ocurrió.
- Mantener trazas de información disponible, consultas, compromisos y resultados que permitan reconstruir causalmente una mejora o un fallo.
- Reservar familias de mapas, restricciones, dependencias, idiomas y eventos. Repetir semillas y perturbaciones temporales; no optimizar para un único desastre de exhibición.
- Evaluar por separado composición, investigación activa, compromisos, reparación, carga humana y memoria. El rendimiento del conjunto no demuestra automáticamente el aporte de cada componente.
- Distinguir mejora en comunicaciones, autorización, movilización y atención. Una red que propaga datos al instante puede seguir limitada por combustible, personal, acceso o permisos.

El visor puede simplificar y explicar los eventos con geometría básica. No debe modificar sus resultados ni dar acceso privilegiado al agente. Un observador puede ver el mundo completo; NEXO sigue operando con información parcial.

## 15. Pruebas de aceptación para la rúbrica — 11 de octubre de 2026

Relacionadas con R1–R7 de [PLATAFORMA.md](PLATAFORMA.md#14-revisión-exigente-de-la-rúbrica--11-de-octubre-de-2026). Son pruebas internas propuestas; no puntuación oficial ni evidencia ya obtenida.

| Prueba | Perturbación/control necesario | Resultado que debe conservarse |
|---|---|---|
| T1 — Aporte de la investigación | Reglas/optimizador, extracción Gemini, agente general con Gemini y NEXO; herramientas y presupuestos comparables | Diferencia en servicio prestado, errores, coste y carga humana, además de la opción descubierta |
| T2 — Capacidad colectiva | Misma dotación y actores: cooperación convencional, datos compartidos y compromisos NEXO; permitir comunicación a todos | Servicio nuevo o antes disponible, coste de coordinación y perjuicios desplazados; incluir casos sin ganancia |
| T3 — Cobertura de redes | Retirar una fuente, limitar API, retrasar noticias, duplicar mensajes, variar idiomas y volumen; una comunidad urgente no publica | Necesidades omitidas, falsas alarmas, demora por comunidad y verificación adicional requerida |
| T4 — Cuello de botella real | Variar por separado retraso informativo, revisión humana, permisos, carga, transporte e instalación | Identificar en qué tramo se gana tiempo; incluir el caso en que pensar más rápido no adelanta el servicio |
| T5 — Competencia y cooperación parcial | Necesidades simultáneas compiten por una dotación finita; un socio no usa NEXO, otro rechaza y otro comparte poco | Asignaciones viables, reservas protegidas, autoridad correcta y tiempos humanos/exteriores contabilizados |
| T6 — Evidencia hostil o corregida | Texto que intenta ordenar acciones, confirmación suplantada, publicación antigua, corrección después de despacho | Sin permisos otorgados por el contenido; decisiones afectadas identificadas y efectos irreversibles conservados |
| T7 — Escala útil | Subir carga y heterogeneidad con presupuesto limitado de operadores y cuotas; degradar una dependencia | Latencia p50/p95, cola, propuestas caducadas, tasa de servicio útil, errores, coste y tiempo humano |
| T8 — Generalización | Reservar familias de dependencias y restricciones, no solo textos/mapas distintos; probar planes parcialmente imposibles | Contribución que se mantiene, condiciones donde falla y capacidad de abstenerse o proponer ayuda parcial |

### 15.1 La información también reacciona al mundo

En al menos una familia de pruebas, las publicaciones y reportes dependen de lo sucedido: una entrega cambia la demanda; un compromiso anunciado no implica recepción; circulan republicaciones viejas después de atender la necesidad; un fallo de cobertura reduce observaciones. No dar a NEXO un feed perfecto que se actualiza antes de que nadie pudiera saberlo.

Separar estas observaciones endógenas de los sucesos externos compartidos entre ejecuciones. No forzar feeds idénticos después de que las acciones hayan producido mundos diferentes. Los parámetros de comportamiento social son supuestos que deben variarse; no atribuirles precisión psicológica por usar personajes autónomos.

### 15.2 Calibrar importa más que añadir detalle

Mantener una ficha por supuesto decisivo: origen, rango plausible, grado de incertidumbre y sensibilidad del resultado. Examinar cobertura de fuentes, retrasos de confirmación, disposición a compartir, tiempos de revisión y preparación/entrega. Si la ventaja desaparece con pequeños cambios plausibles, delimitar el alcance y corregir la hipótesis; no ajustar el mundo para recuperar la cifra de la web.

Un conjunto histórico como [HumAID](https://crisisnlp.qcri.org/humaid_dataset.html) puede aportar texto de crisis con anotaciones para el frente de interpretación. Verificar acceso y condiciones antes de usarlo. Es de mensajes en inglés de eventos pasados: no representa por sí solo los idiomas JAPAC, el acceso actual a redes ni una verdad logística de entregas, recursos y compromisos. No convertir su clasificación en validación del sistema completo. Preparar material multilingüe independiente para comprobar el alcance que se afirme.

### 15.3 Cerrar la evaluación antes de ver el resultado final

- Elegir métricas primarias por servicio, unidades, ventanas, restricciones y comparaciones antes de ajustar el sistema. No fijar 90→12 minutos o 100 casos/minuto como resultados obligatorios.
- Pilotar para estimar variación, fijar repeticiones y criterios de aceptación después del piloto y antes del conjunto reservado. Reportar intervalos y distribuciones, no un único episodio.
- Desglosar por conectividad, idioma, volumen de publicaciones y necesidad. Un promedio mejor no debe ocultar abandono sistemático.
- El evaluador puntúa a partir de eventos físicos y estados autorizados, no de la explicación de Gemini. Los humanos simulados no aportan aprobación gratuita.
- Medir qué porcentaje del flujo usa datos capturados automáticamente, reportes humanos y confirmaciones manuales; los tres cuentan para coste y demora.
- Congelar escenario/evaluador y conservar resultados desfavorables. Una intervención del jurado puede variar restricciones, sin revelar la verdad oculta al modelo.

### 15.4 Lo que el simulador no puede resolver por sí solo

Un laboratorio más detallado no demuestra acceso real a APIs, voluntad institucional de compartir, adopción ni comprensión de operadores reales. Separar el trabajo: simulación para comparar decisiones y consecuencias; revisión externa para supuestos; ejercicios con personas para uso y procedimientos. Un prototipo de hackathon no necesita operación industrial para ser válido, pero sus afirmaciones deben respetar ese alcance.

## 16. Producto del laboratorio y componentes separados

El laboratorio tendrá cinco superficies, alimentadas por el mismo motor:

1. **Configurador:** elegir escenario, mapa, seed, escala, políticas de actores, fuentes, condiciones de conectividad y variante de NEXO. Importar/exportar una configuración versionada.
2. **Mundo 3D:** vista isométrica navegable, entidades seleccionables, trayectos y capas. Seguir un vehículo o una operación de principio a fin.
3. **Observatorio de información:** realidad, publicaciones accesibles y datos realmente ingeridos por NEXO; tres columnas sincronizadas, con contexto bajo demanda.
4. **Superficies de integración:** red social ficticia navegable y scrapeable, portales oficiales y herramientas de organizaciones. Constituyen el entorno que puede observar NEXO, con permisos y demoras.
5. **Evaluador y ejecutor por lotes:** ejecución sin gráficos, referencias de comparación, exportación de trazas y reproducción de resultados. No dependen del navegador.

Descomposición funcional propuesta:

```text
Configuración + seed + versiones
                |
       Motor de eventos y mundo autoritativo
         |               |                  |
         |       Modelos de percepción      Evaluador independiente
         |       y de comunicaciones          |
         |               |                  Resultados
         |       Fuentes publicables          |
         |               |                  Reproducción
         |        NEXO / referencias          |
         |               |                    |
         |       Acciones autorizadas --------+
         |               |
         +---- Validación y consecuencias
         |
  Proyecciones del visor 3D y del observatorio
```

La cámara, el scroll, el número de tarjetas visibles y los FPS no modifican la simulación. El evaluador no decide por NEXO. El simulador no necesita copiar la arquitectura GCP del producto: se conecta por contratos explícitos. El despliegue de NEXO en Google Cloud y las pruebas de su infraestructura se validan por separado.

## 17. Inventario de entradas que debe poder recibir NEXO

Cada entrada tiene un origen, alcance de acceso, momento de observación y momento de disponibilidad. «Existe en el mundo» no significa «NEXO puede consultarla». Los siguientes contratos son el inventario del alcance actual; añadir una capacidad a la plataforma exige actualizar esta tabla y su prueba correspondiente.

| ID | Entrada / fuente simulada | Contenido y variaciones necesarias |
|---|---|---|
| I01 | Publicaciones sociales originales | Solicitud explícita, descripción indirecta, pregunta, oferta, conversación irrelevante, topónimo ambiguo, idioma y registro variables |
| I02 | Republicaciones, citas, hilos y comentarios | Un origen con muchas copias, testimonios independientes, cambios de texto, correcciones, borrados y métricas de popularidad sin garantía de veracidad |
| I03 | Fotos y videos representados como objetos | Descripción visible del contenido, duración, fecha pública cuando exista, miniatura geométrica; material antiguo, incompleto o fuera de contexto |
| I04 | Notas de voz, llamadas y mensajes de equipo | Relato de campo, ruido/transcripción incompleta en el modo textual, destinatarios limitados, recepción diferida y aclaraciones |
| I05 | Noticias y emisiones | Reporte de periodista, fuente citada, zona amplia, actualización editorial, errores y correcciones posteriores |
| I06 | Boletines oficiales | Zonas afectadas, evacuación, restricciones, autorizaciones y cambios; publicación no instantánea ni infalible |
| I07 | Evaluaciones de campo | Inspección de edificio, verificación de acceso, conteo observado, idoneidad de refugio y confirmación de necesidad; consumen personal y tiempo |
| I08 | Necesidades declaradas | Tipo, cantidad, unidad, lugar, personas destinatarias, ventana útil y evolución; cantidades estimadas o duplicadas |
| I09 | Inventarios y suministros | Cantidad física, disponible, reservada, condición, unidad, lotes, compatibilidad, ubicación y antigüedad del inventario accesible |
| I10 | Capacidades de instalaciones | Camas/plazas, producción, almacenamiento, energía, agua, saneamiento, personal, horarios y dependencias para funcionar |
| I11 | Vehículos y planes existentes | Tipo, carga por peso/volumen/plazas, conductor, combustible, posición observada, turnos, retorno vacío y entregas ya comprometidas |
| I12 | Red vial y contexto logístico | Red conocida, límites por vehículo, sentido, restricción, reporte de cierre/reapertura y grado de actualidad; no la red verdadera por defecto |
| I13 | Tiempos estimados y telemetría | ETA con instante de cálculo, posición GPS intermitente, llegadas pendientes de confirmación y diferencias respecto a la realidad |
| I14 | Comunicaciones | Disponibilidad observada de canal, último contacto, acuse de recepción y mensaje en cola; no acceso al mapa real de cobertura salvo publicación autorizada |
| I15 | Personal y organización | Roles, competencia operativa, turnos, descanso, ubicación conocida, responsables y autoridad sobre recursos |
| I16 | Ofertas de otra organización | Capacidad consultable parcialmente, condiciones de préstamo, duración, reserva mínima, autorización y coste de coordinación |
| I17 | Compromisos y cambios | Reserva, aceptación, rechazo, vencimiento, retirada, conflictos y confirmaciones fuera de orden |
| I18 | Documentos y catálogos heterogéneos | PDF/tabla/texto sintéticos, abreviaturas, distintas unidades, alias y fechas; especificaciones para comprobar compatibilidad |
| I19 | Procedimientos y políticas | Quién puede aprobar, prioridades autorizadas, reservas, zonas de operación y condiciones de reasignación; pueden cambiar con versión |
| I20 | Verificaciones solicitadas | Resultado cierto, parcial, inconcluyente, rechazo, silencio o timeout; no devolver automáticamente la verdad del mundo |
| I21 | Recepción y prestación del servicio | Albarán, reporte de entrega parcial, foto de productos, instalación completada, conteo agregado y discrepancias |
| I22 | Fondos y compras de la organización | Donaciones ficticias agregadas, disponibilidad contable, compra, proveedor, plazos, recepción y gastos; siempre sandbox |
| I23 | Estado de herramientas e integraciones | Esquema cambiado, permiso revocado, cuota, timeout, datos en caché, fallos de sincronización y recuperación |
| I24 | Contexto del fenómeno | Pronóstico o aviso publicado, observación de humo/agua/daño, incertidumbre y desfase respecto al evento verdadero |
| I25 | Decisiones humanas | Aprobar, pedir aclaración, modificar, posponer o rechazar con identidad, autoridad y demora; no aprobación automática gratuita |
| I26 | Patrones de incidentes anteriores (H1) | Procedimientos y resultados con condiciones de aplicación; solo si se implementa la ampliación de memoria, sin hechos actuales filtrados |

Los mensajes pueden revelar recursos que no están catalogados como ayuda: «volvemos vacíos», «el polideportivo sigue cerrado», «la bomba está intacta», «el turno termina a las diez». Son observaciones que permiten hipótesis, nunca permisos implícitos.

## 18. Inventario de salidas y acciones de NEXO

Propuesta, petición de autorización, orden enviada y acción física son estados distintos. El motor valida las órdenes contra propiedad, permisos, recursos y condiciones vigentes; el sistema que genera la propuesta no controla su resultado.

| ID | Salida o acción | Efecto que debe simularse / prueba visible |
|---|---|---|
| O01 | Registrar afirmación, incidente o necesidad | Se actualiza el conocimiento de NEXO; no modifica la verdad del mundo |
| O02 | Relacionar, deduplicar o separar reportes | Cambia la interpretación; registrar fusiones falsas y necesidades perdidas |
| O03 | Marcar contradicción, antigüedad o sospecha | Evidencia y revisión; no concede acceso a `is_fake` ni elimina la necesidad real |
| O04 | Consultar fuente, inventario o documento | Tiempo de consulta, cuota, visibilidad, respuesta versionada y posibles fallos |
| O05 | Solicitar aclaración o inspección | Destinatario con carga, conexión, tiempo de respuesta y capacidad real de observar |
| O06 | Proponer plan y alternativas | Condiciones, dependencias, personas beneficiadas y recursos necesarios; aún sin movimiento físico |
| O07 | Solicitar aprobación / priorización | Cola del responsable, autoridad, atención, aclaraciones, aprobación parcial o rechazo |
| O08 | Consultar capacidades de un socio | Respuesta parcial/negativa o diferida; consumo de tiempo de coordinación |
| O09 | Ofrecer, reservar, confirmar o liberar recurso | Estados consistentes, vencimiento, conflictos, permisos y reservas protegidas |
| O10 | Solicitar reasignación o préstamo | Puede perjudicar otra operación; requiere aprobación, traslado y futura devolución cuando corresponda |
| O11 | Preparar y despachar una entrega | Picking/carga, vehículo, conductor, documentación y canal de orden; envío no instantáneo |
| O12 | Proponer cambio de ruta o destino | Integración con planificador/operador; orden solo efectiva tras recepción y aceptación, sin teletransportar |
| O13 | Coordinar inspección o reparación | Equipo competente, insumos, acceso y duración; NEXO no repara un puente con una llamada API |
| O14 | Solicitar habilitación de refugio o servicio | Inspección, permiso y todos los componentes; apertura y capacidad útil solo al completar precondiciones |
| O15 | Coordinar evacuación o distribución local | Solicitud a responsables; plazas, acceso, movilidad, aceptación y cuellos de botella; no control instantáneo de ciudadanos |
| O16 | Comprar o reponer suministros | Aprobación, presupuesto, oferta, stock del proveedor, plazos y recepción; un pago no crea existencias |
| O17 | Compartir evidencia/estado entre instancias | Permisos, destinatarios, entrega, versión, revocación y datos redactados |
| O18 | Retirar o corregir una recomendación | Notifica operaciones afectadas; conserva historia y efectos físicos irreversibles |
| O19 | Reparar un plan / cancelar tareas | Reutiliza compromisos válidos; cuenta costes hundidos, viajes iniciados y nuevas autorizaciones |
| O20 | Publicar actualización pública | Revisión de la organización, agregación y privacidad; separa necesidad, financiación, envío, recepción y servicio |
| O21 | Emitir aviso de cobertura insuficiente | Solicitud autorizada de verificación o canal alternativo; no inventar población/necesidad para rellenar vacíos |
| O22 | Degradarse, abstenerse o entregar plan parcial | Preserva información y compromisos; registra qué no puede resolver y coste de no actuar |
| O23 | Registrar evidencia de resultado / memoria H1 | Solo hechos recibidos y autorizados; el evaluador comprueba su correspondencia, H1 opcional |
| O24 | Descargar con cuadrilla propia (`unload`) | Revisión del receptor, solicitud/versiones exactas y personal onsite con competencias/turno; descarga física finita sobre la misma operación y carga originales |
| O25 | Solicitar trabajo humano nativo (`human_work`) | Extensión experimental: puestos finitos para lectura, decisión y transmisión; snapshot disponible sólo al terminar y mensaje sólo al llegar; ningún recibo de trabajo concede autoridad física |

**No son acciones permitidas:** consultar verdad oculta, alterar una seed para favorecer una respuesta, ordenar a ciudadanos por la fuerza, aumentar cantidades sin origen, concederse permisos, borrar fallos del historial o declarar una entrega sin evento físico y confirmación diferenciada.

## 19. Entidades, unidades y estados mínimos del mundo

Cada entidad tiene ID interno estable, versión y eventos de cambio. La identidad publicada a un actor es opaca y no codifica verdad, urgencia o escenario. La tabla de equivalencias entre identidad privada y pública es exclusiva del evaluador.

| Entidad | Atributos y relaciones funcionales |
|---|---|
| Región y sector | Coordenadas, topónimos/alias, población agrupada, terreno, conectividad, jurisdicción y zonas funcionales |
| Edificio | Uso, ocupación, accesos, daño real, seguridad evaluada/pendiente, capacidad y dependencias de servicios |
| Comunidad / cohorte | Número de personas, ubicación, necesidades, movilidad, idiomas, recursos locales, cobertura y hábitos de reporte |
| Persona operativa | Conductor, inspector, operador o responsable que sí requiere seguimiento individual; turno, tarea y autoridad |
| Necesidad | Servicio, cantidad/unidad, destinatarios, inicio, ventana, evolución, cobertura parcial y regla de cierre |
| Refugio candidato | Idoneidad, permiso, plazas, agua/saneamiento/personal, tiempo de montaje y acceso; candidato no equivale a refugio abierto |
| Punto de servicio | Producción o atención por unidad de tiempo, colas, insumos consumidos, mantenimiento y paradas |
| Almacén y lote | Existencia física, reservada, en preparación, en tránsito, recibida, consumida, perdida; propietario y ubicación |
| Equipo reutilizable | Tipo, capacidades, compatibilidad, condición, combustible/energía, operador, montaje y compromisos |
| Vehículo | Clase, límites, carga, conductor, combustible, posición en arista, ruta, órdenes recibidas y estado |
| Arista vial | Longitud, sentido, clase, capacidad, almacenamiento de cola, pendiente, limitaciones y estado físico |
| Nodo vial | Intersección/acceso, capacidad de paso, giro, bloqueo y cola; conexión a edificios/instalaciones |
| Enlace de comunicación | Tecnología abstracta, zona, capacidad, latencia, pérdida, congestión, energía y reparación |
| Dispositivo / bandeja local | Batería si afecta al caso, mensajes capturados y no enviados, canales y destinatarios |
| Organización | Propiedad, objetivos, políticas, personal, herramientas, permisos y disposición condicionada a colaborar |
| Compromiso | Recurso/cantidad, vigencia, condiciones, contraparte, autoridad, versión y estado de confirmación |
| Tarea y operación | Precondiciones, dependencias, responsable, duración, recursos, estado, interrupción y efectos |
| Señal y publicación | Autor público, contenido, formato, tiempos, ubicación declarada, audiencia, origen público si existe y revisiones |
| Fenómeno / incidente | Geometría afectada, severidad abstracta, evolución y efectos causales; verdad no publicada automáticamente |
| Fondos / compra | Libro contable ficticio, autorización, proveedor, precio configurado, plazo y recepción |
| Herramienta / sesión NEXO | Identidad, alcance, cuotas, reloj, petición/respuesta, errores y acuses de ingesta |

Unidades explícitas en contratos: litros, kg, m³, plazas, kW u otras que correspondan; convertir solo con datos justificables. No sumar plazas y litros ni asumir que volumen determina peso. La compatibilidad de un generador incluye requisitos representados y una comprobación autorizada; no se deriva de la cercanía en el mapa.

**Máquinas de estado obligatorias:**

- Ayuda: `proposed → awaiting_approval → authorized → reserved → preparing → dispatched → arrived → received → service_delivered`, con rechazo, entrega parcial y cancelación donde proceda.
- Recurso: físico/disponible/reservado no son cantidades independientes que se puedan sumar; reservar reduce disponibilidad sin mover la ubicación.
- Refugio: `candidate → assessment_requested → assessed → permission_pending → provisioning → ready → operating → degraded/closed`.
- Orden: `created → queued → transmitted → delivered → acknowledged → accepted/rejected → executing → completed/failed`.
- Evidencia: observación/publicación/ingesta/interpretación/revisión; los estados de creencia no reemplazan los eventos físicos.

Un transporte puede llegar y no descargar por falta de acceso, personal o almacenamiento. Una entrega puede recibirse y todavía no prestar servicio por faltar instalación. Representar ambos casos.

## 20. Motor causal y ciclo de una ejecución

Usar un **motor de eventos discretos** como diseño inicial. Saltar al siguiente evento pendiente; actualizar movimiento y colas en pasos o eventos acotados donde sea necesario. No recalcular toda la población ni llamar a Gemini en cada fotograma.

Orden lógico de un episodio:

1. Validar configuración, unidades, consistencia del mapa y recursos iniciales.
2. Generar mundo, actores y sucesos externos a partir del manifiesto y streams aleatorios versionados.
3. Un fenómeno cambia el mundo: daña un edificio, interrumpe un acceso o corta energía.
4. Los actores que pueden observarlo actualizan su conocimiento local; algunos reportan y otros no.
5. Una señal espera composición, conexión, transmisión y publicación. Puede circular distorsionada o tarde.
6. Las fuentes publicadas evolucionan; el scraper/conector de NEXO descubre solo lo accesible.
7. NEXO interpreta e investiga mediante herramientas autorizadas; cada consulta tiene consecuencia y demora.
8. Los responsables revisan y autorizan. El motor acepta o rechaza comandos y programa sus efectos.
9. La operación modifica cantidades, tráfico, necesidad, percepción y futuros reportes.
10. El evaluador registra consecuencias; el visor muestra proyecciones de esa misma ejecución.

Todo evento utiliza tiempo simulado entero, prioridad de fase documentada, clave de entidad y secuencia estable para desempate. Un cierre y un despacho simultáneos necesitan una regla explícita. No depender del orden de llegada de promesas JavaScript, threads o frames.

Los sucesos externos pueden seguir un guion reproducible. Los sucesos causados por acciones se generan al cumplir sus precondiciones. No preprogramar una entrega ganadora o una publicación de agradecimiento si la entrega no ocurrió.

## 21. Mapas grandes, procedurales y editables

### 21.1 Representación funcional

Generar un grafo vial jerárquico y sectores geográficos: región → localidades → barrios → accesos. Asociar edificios y servicios a accesos reales. El mapa 3D es una proyección; no necesita modelar cada callejón si no cambia ninguna opción relevante.

Incluir zonas urbanas, rurales, forestales y periurbanas; corredores principales, rutas alternativas, puentes, accesos estrechos, pendientes y callejones sin salida. Distribuir almacenes, estaciones de equipos, centros sanitarios abstractos, escuelas, refugios candidatos, fuentes de agua y telecomunicaciones. Variar agrupación, densidad y distancia para evitar patrones repetidos que revelen la solución.

El generador comprobará conectividad inicial donde corresponda, accesos de cada instalación, distribución de recursos y plausibilidad de distancias. Algunos escenarios pueden tener sectores aislados, pero debe ser intencional y quedar registrado. No exigir que cada escenario tenga solución.

### 21.2 Parámetros de generación

`extent_km`, topología, densidad de población/edificios, longitud y jerarquía de carreteras, terreno, concentración de servicios, desigualdad de cobertura, número de organizaciones, dispersión de capacidades y porcentaje de dependencias desconocidas para ellas.

Poder regenerar solo un subsistema con una seed específica sin cambiar el resto. Guardar el mapa generado como artefacto versionado para congelarlo; un cambio de generador no debe alterar silenciosamente una comparación antigua.

### 21.3 Tamaño y detalle independientes

Objetivos de configuración, sujetos a pruebas de rendimiento:

| Perfil | Extensión orientativa | Resolución operativa | Propósito |
|---|---|---|---|
| Caso verificable | 2–5 km por lado | Decenas de lugares, vehículos individuales | Revisar causalidad a mano |
| Ciudad | 10–20 km por lado | Centenares de lugares; barrios y arterias | Tráfico, señales y servicios en competencia |
| Región | 50–100 km por lado | Miles de lugares relevantes y corredores | Cuatro o más equipos separados, red y largos trayectos |
| Estrés | Independiente de la cámara | Multiplicar actores/eventos sin añadir geometría equivalente | Capacidad del motor, conectores y NEXO |

No se afirma una equivalencia exacta con GTA V. La sensación de escala proviene de distancias, tiempos, jurisdicciones y recursos dispersos, no de reproducir un mapa de videojuego. El tamaño máximo se elegirá después de medir memoria y eventos/segundo.

## 22. Tráfico, desplazamiento y cadena logística

### 22.1 Modelo ligero pero causal

Vehículos de ayuda como entidades individuales; tráfico de fondo como flujos o cohortes con orígenes, destinos y horarios. Visualizar una muestra geométrica del tráfico de fondo sin inventar vehículos adicionales en el motor. Si una cohorte se expande para inspeccionarla, conservar cantidades.

Cada arista tiene tiempo libre, capacidad de salida y espacio finito para colas. La entrada puede bloquearse si la siguiente arista está llena; así una congestión puede propagarse hacia atrás. Elegir una regla mesoscópica documentada, determinista y calibrable. Evitar un simple multiplicador global que no responda a las acciones.

Factores representados: evacuación, convergencia de ayuda, intersecciones, restricciones por tamaño/peso, sentido único, accesos bloqueados, reapertura parcial, combustible, relevos, horario, carga, descarga y espera en destino. Las prioridades de vehículos de emergencia solo se aplican donde la política y la vía las permiten.

### 22.2 Conocimiento y órdenes

El conductor decide con su ruta y la información que ha recibido. Un vehículo puede descubrir un obstáculo al llegar antes de que NEXO lo sepa. NEXO puede conocer una corrección antes que el conductor, pero la orden de desvío debe viajar por un canal disponible.

Registrar: instante de recomendación, autorización, transmisión, recepción, aceptación y comienzo del desvío. Si no hay cobertura, el vehículo mantiene la última orden válida o aplica el procedimiento local configurado. El estado actual real y el último GPS conocido deben poder verse por separado.

### 22.3 Efectos comprobables

- Dos envíos hacia el mismo acceso pueden aumentar la congestión y retrasarse mutuamente.
- Una ruta corta puede resultar peor por carga, cola o tipo de vehículo.
- Un regreso vacío ofrece capacidad solo si respeta carga, desvío, turno, combustible, permiso y siguiente compromiso.
- El retraso puede hacer caducar una oferta, cerrar un acceso o impedir completar el servicio.
- Cambiar de destino después de salir conserva combustible consumido, distancia recorrida y entregas parciales.
- Una reapertura conocida tarde puede dejar capacidad sin usar; una falsa reapertura puede generar un viaje fallido.

Mostrar A→B, ETA inicial y revisada, posición, carga y motivo de espera. El movimiento visual interpola el trayecto del motor; no genera por sí mismo la llegada.

## 23. Conectividad, retrasos y pérdida de información

### 23.1 Canales independientes

Separar conexión de la comunidad, del vehículo, de la organización, de la fuente pública y del backend. Que una ONG tenga internet no significa que un conductor pueda recibir instrucciones. Representar internet móvil, enlace fijo y canales alternativos abstractos —radio, llamada o mensajero— con disponibilidad, capacidad y coste distintos.

Variables configurables: cobertura espacial, interrupciones por energía/daño, saturación, latencia, ancho de banda, pérdida, reintento, mensajes duplicados, orden alterado, límite de cola local y reparación. Modelar dependencia entre torre, energía y enlaces cuando cambie el resultado. La conectividad puede volver de manera parcial e intermitente.

### 23.2 Línea temporal de un mensaje

```text
hecho → observado → grabado/escrito → pendiente de conexión → enviado
→ recibido por el servicio → publicado → descubierto por el scraper
→ descargado → aceptado en ingesta NEXO → interpretado → revisado
```

No todos los pasos existen para todos los canales. Cada uno conserva su propio timestamp. Una grabación de las 09:10 subida a las 11:00 no describe necesariamente la situación de las 11:00. El reloj del dispositivo puede estar desajustado; la hora verdadera de captura es privada si no se ha hecho pública.

Una orden recorre otra cadena: aprobación → envío → transporte → recepción → acuse → aceptación → ejecución. Un ACK técnico no equivale a aceptación humana. Un timeout no prueba que una orden no haya llegado; los reintentos deben usar identidad e idempotencia.

### 23.3 Casos necesarios

- Edificio sin cobertura: se graba un video local, se publica al desplazarse alguien a otra zona.
- Reconexión: llega una ráfaga de contenido antiguo junto con reportes nuevos.
- Red saturada: texto puede llegar antes que un adjunto grande, aunque el adjunto solo sea un objeto simulado.
- Organización aislada: sigue trabajando con compromisos locales; al reconectar no duplica reservas.
- Vehículo sin GPS: el observador ve su posición real y NEXO conserva una última posición con antigüedad.
- Mensaje de cancelación perdido: la operación continúa hasta recibirlo; el simulador conserva el daño/coste de esa demora.
- Canal alternativo: se puede pedir una confirmación por radio mediante una persona que tiene acceso, consumiendo su tiempo.

En el visor, una capa de cobertura muestra zonas, enlaces y mensajes pendientes. En perspectiva NEXO solo se muestran la cobertura publicada y los contactos observados. Inspeccionar dónde se perdió cada minuto: publicación, descubrimiento, descarga, interpretación, autorización o instrucción.

## 24. Familias de desastres y efectos relevantes

Los perfiles siguientes son hipótesis de modelado, no protocolos de respuesta ni reconstrucciones históricas. No atribuir a un terremoto concreto de Venezuela fechas, víctimas o fallos sin fuentes verificadas. Puede existir un perfil de sismo urbano inspirado en una región latinoamericana, con restricciones configurables y nombre ficticio.

| Dimensión | Terremoto | Incendio forestal | Inundación |
|---|---|---|---|
| Cambio físico | Daños discretos iniciales y réplicas configuradas | Frente o sectores de peligro que evolucionan con un campo de viento abstracto | Profundidad/zonas inundadas y evolución de nivel simplificada |
| Edificios | Inseguros, colapsados, accesos bloqueados, necesidad de evaluación | Expuestos, evacuados, dañados o inaccesibles | Planta baja inaccesible, ocupación desplazada, capacidad perdida |
| Vías | Escombros, puentes dañados, reapertura tras inspección/reparación | Cierres preventivos, humo y avance que invalida rutas | Restricción según profundidad y clase de vehículo; cierres y reaperturas |
| Población | Desplazamiento, reunificación abstracta y necesidad de refugio/agua | Evacuación progresiva, aceptación parcial de avisos, congestión | Comunidades aisladas, desplazamiento y distribución irregular |
| Servicios | Cortes de energía/agua, instalaciones intactas pero sin dependencias | Pérdida de energía/enlaces, refugio que deja de ser seguro | Agua no utilizable según escenario, energía y telecomunicaciones afectadas |
| Información | Fotos de daños, confusión de lugares, réplicas y reportes viejos | Videos de humo con ubicación incierta, rumores de dirección, avisos cambiantes | Niveles reportados a distintas horas y accesos que cambian rápido |
| Coordinación | Evaluar candidatos, combinar capacidades, reparar respuesta | Decidir antes de que cierre una ventana, desplazar recursos autorizados | Elegir acceso/medio adecuado, evitar sobreabastecer sitios accesibles |

### 24.1 Terremoto: cadena causal de referencia

Daño en sectores → pérdida de vivienda y servicios → aumento de necesidades y solicitudes → congestión por desplazamiento y ayuda → fuentes incompletas → inspección de refugios candidatos → dotación repartida entre organizaciones → habilitación. Una réplica puede invalidar la inspección o una vía y exigir una revisión localizada.

Representar equipos de búsqueda/rescate como capacidad autorizada, duración de tarea y acceso si son parte del escenario. No simular técnicas clínicas ni calcular fallecimientos a partir de un umbral inventado. Las prioridades y ventanas son parámetros revisables; el resultado principal sigue siendo atención prestada y necesidad pendiente.

### 24.2 Incendio: peligro dinámico, no efectos gráficos

Representar celdas o polígonos con estados de peligro y tiempos de transición. El motor puede usar una regla de propagación simplificada y versionada; los pronósticos publicados pueden diferir de la evolución real. Humo, viento y estado de combustible vegetal solo necesitan resolución que cambie acceso, exposición o decisión.

Una ruta viable al despacho puede dejar de serlo antes de llegar. Un refugio abierto puede requerir traslado. El aviso puede difundirse más lentamente que el cambio de riesgo. Simular población que recibe tarde, espera transporte, sigue un aviso antiguo o toma rutas alternativas; las proporciones son supuestos para sensibilidad, no predicciones universales de conducta.

Las acciones de contención solo se modelan si NEXO coordina esos equipos; tendrán personal, agua/equipo, acceso, duración e incertidumbre. No permitir que el sistema elimine una zona de peligro al enviar una propuesta.

### 24.3 Inundación y eventos compuestos

El acceso depende de vehículo, tramo y hora. Una interrupción eléctrica puede detener bombeo o comunicaciones. Incluir descenso del agua que no implica apertura autorizada inmediata. Mezclar dos fenómenos en algunos escenarios reservados: daño estructural más incendio localizado, o inundación más fallo eléctrico. No convertir todos los episodios en un catálogo de catástrofes simultáneas; aislar causas en pruebas unitarias del mundo.

## 25. Red social ficticia y generación de información

### 25.1 Superficie scrapeable real dentro del laboratorio

Construir una pequeña web social propia con timeline, permalink por publicación, perfiles sintéticos, hilos, comentarios, citas, búsqueda, filtros de fecha/lugar y paginación por cursor. Debe poder abrirse en un navegador y ser recorrida por un scraper autorizado de NEXO. No basta con entregar a la plataforma un array perfecto generado en memoria.

La interfaz pública se sirve desde una proyección limitada del mundo. Rutas propuestas, no contratos finales: `/feed`, `/posts/{public_id}`, `/users/{public_id}`, `/search?q=...`. El HTML debe contener solo lo que podría ver un visitante con ese permiso. Añadir una API equivalente como conector alternativo; evaluar scraping y API por separado para no confundir un problema de DOM con investigación de Gemini.

Simular fecha de indexación, ranking, filtros incompletos, límite de resultados, rate limiting, respuestas repetidas, errores, cambios de formato y publicaciones eliminadas. La plataforma no recibe automáticamente cada post; tiene que descubrirlo mediante su estrategia de ingesta. Un modo de fixtures podrá entregar entradas fijas para aislar otros componentes, claramente identificado.

Perfiles, nombres, avatares, organizaciones, teléfono y ubicaciones son ficticios. No scrapear redes reales para generar la prueba por defecto. Los contenidos hostiles del escenario son datos dentro del laboratorio y no conceden permisos reales.

### 25.2 Del evento a una publicación

Un ciudadano o cohorte tiene probabilidad condicionada de observar, interpretar y publicar, idioma, canal, acceso, motivación y demora. No toda persona informa; varias observan lo mismo desde ángulos distintos; otras solo repiten un rumor.

El generador sigue esta cadena:

`evento observado → intención comunicativa → plantilla elegible → valores visibles para el autor → formato → cola de envío → publicación → difusión/reacciones`.

Las plantillas tienen precondiciones causales. No generar «ya llegó agua» si nadie recibió agua, salvo que el caso sea explícitamente una afirmación falsa. La desinformación se modela como afirmación incorrecta, contenido antiguo, exageración, atribución errónea, broma o manipulación; no una categoría monolítica. Un mensaje puede contener partes verdaderas y falsas.

Un mecanismo de difusión genera copias dependientes de exposición, popularidad y conexiones. Preservar la procedencia privada para evaluar independencia; solo exponer enlaces y atribuciones que serían visibles. Un rumor con 2.000 republicaciones sigue pudiendo proceder de una sola fuente.

### 25.3 Formatos sin archivos pesados

Objeto de medio propuesto: `public_media_id`, `kind`, `duration_s`, `preview`, `public_caption`, `visible_metadata`, `payload_bytes_simulated`, `availability`. No incluir etiquetas privadas, el evento verdadero ni una interpretación perfecta.

- **Video:** rectángulo con play, duración y descripción de lo representado; puede mostrar humo sin demostrar lugar, fecha ni causa.
- **Foto:** miniatura geométrica y pie de foto; puede ser parcial, antigua o estar mal atribuida.
- **Nota de voz:** icono, duración y transcripción sintética con omisiones/ambigüedades configurables.
- **Noticia:** titular, extracto, autor/editor, fecha y fuente citada cuando exista.
- **Documento:** tabla o texto sintético legible, con unidades, encabezados y catálogos distintos.

**Límite de evaluación:** si Gemini recibe una descripción o transcripción ya escrita, se evalúa interpretación de texto asociado a medios, no percepción real de video/audio. Una futura prueba multimodal debe aportar archivos sintéticos o autorizados reales y medir también errores de percepción. La descripción de un video falso debe describir su contenido aparente, no revelar por qué es falso.

### 25.4 Cambios posteriores

Permitir edición, borrado, respuesta aclaratoria, corrección, desmentido, republicación tardía y captura de una versión vieja. NEXO conserva el contenido y la fecha que recibió; no modificar retroactivamente su evidencia. Una entrega puede reducir peticiones nuevas, pero las viejas siguen circulando. Los efectos de publicaciones del portal sobre ciudadanos/donantes serán opcionales y parametrizados, no un beneficio garantizado de transparencia.

## 26. Biblioteca de presets de contenido

### 26.1 Tamaño y estructura

Preparar **al menos 360 presets revisables: 30 familias × 12 situaciones base**. Cambiar nombres o traducir una frase no cuenta como un nuevo preset base. Cada familia cubre distintos hechos, restricciones o formas de comunicación. La cifra es un requisito de variedad de autoría, no una métrica de calidad del modelo.

Cada preset define: ID privado, familia, precondiciones, conocimiento del autor, intención, formato, texto/slots, restricciones de combinación, modalidad, demora, alcance, comportamiento de difusión, posibilidad de revisión, variantes lingüísticas y campos reservados al evaluador. Separar contenido público de etiquetas de evaluación en archivos y servicios distintos.

Dividir familias/combinaciones y autores entre desarrollo, validación y prueba reservada; no reutilizar exactamente las plantillas de la demo para acreditar generalización. Proponer inicialmente español e inglés, y añadir idiomas de la región que se afirme cubrir con revisión competente. No atribuir robustez multilingüe a traducciones automáticas sin comprobarlas.

### 26.2 Catálogo obligatorio de familias

| Familia | Ejemplo breve del tipo de publicación; valores ficticios |
|---|---|
| P01 — Solicitud explícita | «En Los Sauces queda agua para esta mañana. Somos unas 300 personas.» |
| P02 — Necesidad indirecta | «Las familias van de casa en casa buscando dónde pasar la noche.» |
| P03 — Capacidad no ofertada | «Terminamos en Mirador a las 10:30; regresamos sin carga.» |
| P04 — Recurso condicionado | «Podemos prestar el generador si vuelve antes del cambio de turno.» |
| P05 — Instalación candidata | «La escuela está vacía, pero nadie ha revisado el ala del fondo.» |
| P06 — Dependencia oculta | «La bomba no se rompió. Lo que falta es corriente.» |
| P07 — Acceso cerrado | «No pasan camiones por el acceso norte; una furgoneta sí pudo salir.» |
| P08 — Reapertura parcial | «Abrieron un carril, todavía están revisando el puente.» |
| P09 — Congestión | «Llevamos media hora sin avanzar con la ayuda.» |
| P10 — Pérdida de conexión | «Voy a subir los reportes cuando llegue al cruce con señal.» |
| P11 — Reconexión tardía | «Esto lo grabé a las nueve, recién pude publicarlo.» |
| P12 — Video de daño | Clip descrito de fachada caída, ubicación declarada sin confirmar |
| P13 — Video antiguo | Clip de otro episodio recirculado con un texto actual |
| P14 — Lugar confundido | Dos barrios con el mismo nombre y una referencia incompleta |
| P15 — Cantidad ambigua | «Llegaron veinte cajas» sin tamaño ni contenido verificable |
| P16 — Unidad incompatible | Inventario en bidones y solicitud en litros; capacidad del bidón pendiente |
| P17 — Rumor reenviado | «Me dijeron que ya no necesitan nada allí» sin testigo directo |
| P18 — Difusión coordinada | Muchas cuentas copian una misma afirmación incorrecta |
| P19 — Corrección | «La foto no era de este barrio; retiro lo que publiqué.» |
| P20 — Testimonio contradictorio | Otro autor observa que la entrega anunciada aún no llegó |
| P21 — Confirmación parcial | «Recibimos 200 litros; sigue faltando el resto.» |
| P22 — Compromiso retirado | «El conductor fue reasignado, no podemos hacer ese viaje.» |
| P23 — Estado desactualizado | El almacén publicado como abierto ya cerró por seguridad |
| P24 — Cambio de necesidad | Llegan nuevas familias después de una evacuación |
| P25 — Información irrelevante | Conversación local, solidaridad genérica, comentario sin dato operativo |
| P26 — Contenido manipulador | Documento que intenta ordenar al agente revelar información; solo fixture aislado |
| P27 — Fuente oficial tardía | Boletín confirma una restricción que los residentes reportaron antes |
| P28 — Comunidad poco visible | Un mensajero transmite una nota de varias familias sin internet |
| P29 — Suministro desequilibrado | «Ya no cabe más ropa; faltan recipientes y agua.» |
| P30 — Transparencia y apoyo | Organización comunica recaudación, compra, salida o recepción como estados separados |

### 26.3 Variación y ausencia de pistas artificiales

Para cada familia variar registro, longitud, precisión, canal, autor, idioma, topónimo, tiempo de publicación, dependencia de otra fuente y estado de conexión. Incluir contenido correcto redactado mal y contenido falso redactado profesionalmente. Evitar que todas las mentiras contengan la misma palabra, formato, avatar o patrón de ID.

Generar el volumen mediante actores, difusión y mezcla de familias, no únicamente clonando frases. Mantener algunos casos sin reportes útiles. Los presets pueden prepararse offline con asistencia de modelos, pero el motor de alto rendimiento debe instanciarlos sin una llamada LLM por persona/post. Conservar revisión humana y conjuntos de evaluación independientes.

## 27. Personas, organizaciones y cooperación

### 27.1 Comportamiento ligero

Usar máquinas de estado y reglas probabilísticas con seed; no miles de agentes LLM. Representar población como cohortes mientras no se necesite seguimiento individual. Los personajes geométricos son representaciones de esas entidades, no necesariamente una persona simulada por cada muñeco.

Modelar selección de canal, percepción parcial, demora para actuar, movilidad, seguimiento parcial de avisos, ayuda vecinal y consumo de recursos solo donde afecten a NEXO. No inferir conducta a partir de rasgos sensibles ni atribuir intención uniforme a una comunidad. Los parámetros se calibran o se declaran hipotéticos.

### 27.2 Responsables y atención humana

Cada organización tiene operadores por turno, roles y autoridad limitada. Solicitudes entran en una cola con tiempo de comprensión, posibilidad de pedir aclaración, rechazar o autorizar parcialmente. Un operador no confirma una inspección que no realizó; un responsable no promete recursos ajenos.

Dos modos: políticas simuladas reproducibles para experimentos y personas reales para ejercicios de uso. Guardar acciones humanas para replay; no prometer repetibilidad exacta entre sesiones humanas distintas. Medir también el coste de atender solicitudes de verificación que genera Gemini.

### 27.3 Cooperación imperfecta

Permitir intercambio solo por consulta, datos agregados, capacidad publicada sin inventario completo, participación de socios sin NEXO y acuerdos temporales. Simular costes, negativas legítimas, reservas mínimas y prioridades distintas. La cooperación no es automáticamente instantánea ni universal.

Compromisos condicionados requieren una máquina de estados consistente con expiración, confirmación y recuperación. Si falla la coordinación a mitad de una reserva múltiple, no dejar recursos bloqueados para siempre ni ejecutar una mitad como si el conjunto estuviera aprobado. El protocolo específico lo decidirá la plataforma; el simulador ofrece fallos y verifica invariantes.

### 27.4 Portal público y dinero ficticio

Una población de donantes sintéticos puede ver necesidades y aportar a una organización mediante un libro contable sandbox. Separar prometido, recibido contablemente, disponible, comprometido en compra, gastado y suministros recibidos. No vincular automáticamente un donante con una unidad física.

Las compras tienen proveedor, disponibilidad, demora y posible fallo. El portal publica agregados revisados y evidencia de suministros/recepción con privacidad. Si se explora cómo la transparencia afecta a aportes, reportarlo como una hipótesis de comportamiento parametrizada; no como prueba empírica de confianza.

## 28. Contratos de integración, observabilidad y aislamiento

### 28.1 Sobre mínimo de eventos y observaciones

Contrato propuesto, pendiente de implementación:

```json
{
  "schema_version": "1",
  "run_id": "opaque-run-id",
  "public_id": "opaque-record-id",
  "source_type": "social_post",
  "published_at": "2026-01-01T09:17:00Z",
  "observed_at_claimed": null,
  "available_at_sim_ms": 1020000,
  "version": 1,
  "scope": "public",
  "content": {"text": "We are returning empty after the delivery."},
  "public_references": [],
  "attachments": []
}
```

`available_at_sim_ms` es un control del gateway del laboratorio; no necesita enviarse al prompt de NEXO. La verdad privada conserva evento causal, fecha real, localización real, partes correctas/incorrectas y procedencia del generador en otro esquema. No derivar IDs públicos por una transformación que permita recuperar esas etiquetas.

### 28.2 Contrato de acción

Toda petición incluye `action_id`, `run_id`, organización/actor autenticado, tipo, parámetros, versión esperada, evidencias públicas, autorización o solicitud pendiente e `idempotency_key`. El resultado incluye aceptado/rechazado/pendiente, motivo observable y momento de disponibilidad. Los permisos vienen de la sesión y del motor, no de un campo libre que el LLM pueda falsificar.

Proponer adaptadores para consultar fuentes, pedir verificación, consultar disponibilidad, ofrecer/reservar/confirmar/liberar, despachar, solicitar cambio, publicar actualización y registrar recepción. Los nombres concretos HTTP/MCP se definirán al integrar. MCP puede exponer herramientas; no se considera sustituto de autenticación, colas ni transacciones.

### 28.3 Medir qué consumió la plataforma

La columna de ingesta usa acuses instrumentados: descargado por conector, aceptado, descartado con motivo, pendiente de interpretación y asociado a una afirmación. Haber servido una página al scraper no prueba que NEXO haya leído cada post. Hasta integrar esa telemetría, la columna debe decir «sin conexión a NEXO» o «consumo simulado», nunca atribuirle trabajo ficticio.

### 28.4 Frontera de seguridad del experimento

Separar servicio de observador/evaluador y servicio accesible a la plataforma, con credenciales, rutas y archivos distintos. El scraper no tiene sesión del observador. No servir el JSON privado desde el mismo frontend con un botón que lo oculte; no incluir etiquetas en HTML, atributos `data-*`, CSS, URLs, errores ni respuestas de herramientas.

Registrar accesos denegados y revisar fugas por búsquedas, logs, trazas de errores y metadatos. Un fixture malicioso puede solicitar información o inventar una autorización; las herramientas deben rechazarlo por control externo al modelo. Ejecutar el laboratorio aislado de pagos, despachos o mensajería reales.

## 29. Relojes, velocidades y ejecución ×1000

### 29.1 Tres tiempos independientes

- **Tiempo del mundo:** cuándo suceden daños, viajes, publicaciones, aprobaciones y servicios.
- **Tiempo de cómputo real:** cuánto tardan motor, Gemini, herramientas y almacenamiento en el ordenador o infraestructura.
- **Tiempo de reproducción:** velocidad a la que se enseña una ejecución; cambiarla no altera resultados.

Mostrar los tres cuando importe. Un selector ×1000 solicita avanzar mil segundos simulados por segundo real, pero no garantiza que el hardware o servicios externos puedan sostenerlo. Si no se alcanza, mostrar velocidad efectiva y cuello de botella; nunca descartar eventos para aparentar velocidad.

### 29.2 Modos explícitos

| Modo | Uso | Reglas y límites |
|---|---|---|
| Interactivo del mundo | Diseñar, pausar, inspeccionar, inyectar un evento | Motor con reglas/políticas locales; pausa, paso, ×1/×10/×100/×1000 sujeto a rendimiento |
| Headless por lotes | Miles de pasos sin render, barrido de seeds/parámetros | Avanza tan rápido como permita el motor; aislado por ejecución; métricas de rendimiento reales |
| NEXO/Gemini conectado en tiempo vivo | Medir pipeline y latencias reales | Reloj y deadlines definidos; llamadas/órdenes llegan cuando llegan; registrar velocidad efectiva |
| Evaluación acelerada con tiempos modelados | Comparar decisiones sin esperar horas de trayectos | Barreras de cálculo y latencias simuladas calibradas; misma política para todas las variantes; no es medición de latencia real a ×1000 |
| Replay de una traza | Demo, depuración y auditoría | Sin nuevas decisiones ni llamadas LLM; reconstruye una ejecución guardada a cualquier velocidad viable |

En modo conectado, acelerar el mundo también consume más deprisa las ventanas operativas; no tomar un resultado así como equivalencia directa de operación en tiempo real. Para experimentos acelerados, el planificador debe detener el avance en barreras donde falta un resultado externo, asignar su disponibilidad según la política de latencia declarada y continuar de forma consistente. El tiempo real esperando a la API se registra aparte. Nunca insertar una decisión en un momento pasado después de haber calculado sus consecuencias futuras.

No prometer ×1000 para una cadena ilimitada de llamadas reales a Gemini. Las mayores aceleraciones se consiguen con motor local, políticas de referencia, latencias modeladas y replay. No reutilizar una respuesta grabada para otro contexto y llamarla nueva decisión del modelo.

### 29.3 Controles del reloj

Play/pausa, paso al siguiente evento, avance hasta una hora, avance hasta el próximo evento relevante de una operación y retorno mediante replay. Rebobinar una ejecución viva crea una rama identificada desde un checkpoint; no reescribe la ejecución original. Inyectar una retirada o cierre produce una intervención registrada y un nuevo identificador de variante.

Las demoras de autoría, publicación, red, scraping, cómputo, revisión, permiso, preparación, viaje, descarga e instalación tienen parámetros separados. El panel de una operación debe mostrar su contribución al tiempo total.

## 30. Seed, repetibilidad exacta y comparación emparejada

### 30.1 Manifiesto completo

Guardar antes de empezar: `root_seed`, mapa o hash de mapa, configuración, versión del motor y runtime, reglas de tráfico/desastres/comunicación, librería de presets, política de actores, evaluador, variante de solución, esquema de herramientas, reloj, límites y política de latencia. Para NEXO: modelo solicitado y metadatos de versión disponibles, prompts, parámetros, tools y respuestas observadas. No afirmar conocer una versión interna del proveedor que no exponga.

La misma seed por sí sola no basta. Cambiar la biblioteca o el motor puede cambiar el resultado. Hash y versiones permiten detectar ese cambio.

### 30.2 Aleatoriedad independiente por subsistema

Usar un generador seudoaleatorio especificado y versionado, con streams independientes para mapa, fenómeno, población, necesidades, comunicaciones, publicación, difusión, tráfico de fondo y políticas de operadores. Evitar `Math.random()` o el reloj del sistema para decisiones del mundo.

Preferir sorteos indexados por claves estables como `(seed, subsystem, entity_id, event_key, draw_index)`, usando un algoritmo documentado. Una consulta adicional de NEXO no debe consumir el siguiente número aleatorio que determinaba una réplica o el clima de la otra variante. No utilizar hash nativo de un lenguaje si varía entre procesos.

Timestamps enteros, cantidades con precisión definida, iteraciones ordenadas y desempates explícitos. Determinismo verificable en el runtime soportado; si se pretende igualdad entre arquitecturas/runtime, requiere pruebas adicionales de aritmética y serialización.

### 30.3 Qué se repite exactamente

| Condición | Garantía buscada |
|---|---|
| Mismo manifiesto y mismas acciones de entrada | Mismos eventos y resultados del mundo, comprobados por hashes |
| Misma seed con distinta solución | Mismo comienzo y perturbaciones externas; consecuencias pueden divergir legítimamente |
| Mismas llamadas nuevas a un LLM | No se garantiza respuesta idéntica, ni con temperatura cero; repetir y medir variación |
| Replay con decisiones/respuestas guardadas | Reconstrucción exacta del episodio registrado, sin atribuirlo a una inferencia nueva |
| Intervención humana nueva | Puede cambiar resultados; guardar acciones para reproducir esa sesión específica |

### 30.4 Comparaciones y ramas

Separar azar exógeno de efectos de las decisiones. Si una variante entrega agua, reduce necesidad y altera publicaciones; la otra no debe recibir una falsa confirmación para mantener feeds idénticos. Mantener iguales las perturbaciones externas pertinentes, permitiendo que tráfico, consumo y reportes endógenos diverjan.

Dos clases de prueba: **open loop**, mismas entradas fijas para comparar interpretación; **closed loop**, mundo reactivo para comparar acciones y consecuencias. Reportarlas separadamente. Un caso de mensajes prefijados no valida coordinación dinámica.

Congelar ejecuciones originales y permitir `fork_from_checkpoint` con variante/autor/intervención. Al comparar, mostrar qué condiciones iniciales y políticas fueron iguales, y qué cambió. Una actualización de plataforma no modifica logs ni resultados anteriores.

## 31. Diseño funcional del visor 3D

### 31.1 Cámara y navegación

Vista isométrica mediante cámara ortográfica; desplazamiento horizontal, arrastre, zoom, rotación limitada opcional y encuadre de región/organización/operación. Controles equivalentes por teclado, botón de volver al contexto y búsqueda por entidad. Nunca exigir precisión de videojuego para encontrar una necesidad.

Seleccionar edificio, vehículo, refugio, organización o mensaje y enfocar sus relaciones. Seguir un camión mantiene su posición en cámara, mostrando destino, orden vigente, carga, ETA y última comunicación; poder salir del seguimiento sin perder selección.

### 31.2 Lenguaje de objetos

| Elemento | Representación geométrica / estado |
|---|---|
| Edificio | Prisma simple; altura para uso/escala, no calidad visual |
| Edificio afectado | Coral con icono de necesidad/daño; pulso opcional; distinguir daño de necesidad |
| Refugio candidato | Icono de refugio y contorno; dependencias pendientes visibles al seleccionar |
| Refugio operativo | Mismo símbolo con estado y capacidad/ocupación; no solo cambio de color |
| Comunidad | Agrupación de figuras simples; número agregado y necesidad por servicio |
| Vehículo | Caja/cabina básica, orientación por ruta, icono de carga y estado |
| Almacén / equipo | Volumen y símbolo estable, disponibilidad conocida distinta de inventario físico |
| Organización | Identidad propia y ámbito local; conexiones muestran información/compromisos, no rutas de camión |
| Peligro | Polígono/trama con leyenda: exposición, incendio, inundación o daño; no zona roja sin significado |
| Sin conexión | Trama/icono de antena interrumpida, última comunicación y mensajes pendientes |
| Ruta / orden | Ruta física continua; comunicación discontinua; estilos y leyenda distintos |

Los colores coral, azul y violeta pueden conservar el lenguaje de la landing. Añadir formas, iconos y texto accesible para que el significado no dependa del color. Pulsos suaves desactivables; no parpadeo rápido. La interfaz funcional debe seguir siendo legible sin animaciones.

### 31.3 Capas y niveles de detalle

Capas activables: necesidades, refugios, recursos, operaciones, rutas/tráfico, conectividad, peligro, organizaciones, información y cobertura de observación. Mostrar pocas por defecto; leyenda siempre accesible. La selección abre un inspector único, no muchos paneles compitiendo por atención.

Al alejarse: edificios → clusters de sectores → nodos de región y conexiones. Dejar de dibujar edificios cuando ya no se distinguen. No cambiar la resolución operativa del motor por mover la cámara. Agregar métricas sin contar dos veces y conservar posibilidad de entrar en un sector.

### 31.4 Perspectivas y comparación

Conmutar explícitamente entre «realidad del simulador» y «lo que esta organización sabe». La segunda oculta entidades no observadas y muestra antigüedad/incertidumbre; no basta con bajar su opacidad mientras siguen siendo inspeccionables.

Comparación A/B con cámaras y reloj simulado sincronizados, mismos recursos iniciales y leyenda. Poder seguir la misma necesidad en ambas ejecuciones aunque los vehículos o planes diverjan. No sincronizar por número de frames ni forzar resultados visualmente equivalentes.

## 32. Tres columnas de información sin perder legibilidad

### 32.1 Distribución

Mapa como superficie principal. Panel lateral desplegable de tres columnas; en pantalla estrecha usar pestañas sincronizadas. El objetivo funcional es comparar las brechas de información, no obligar a leer toda la corriente.

| Columna | Contenido | Procedencia |
|---|---|---|
| 1. Lo que ocurre | Daños, cambios de necesidad, desplazamientos, cortes, operaciones y servicio real | Registro autoritativo, solo observador |
| 2. Lo que se comunica | Publicaciones, audios, noticias y reportes; filtros para pendiente de conexión/publicado/accesible por actor | Registro de observaciones y publicaciones |
| 3. Lo que NEXO consume | Contenido descargado, aceptado, interpretado o descartado; retrasos y vínculos a propuestas | Acuses reales de conectores y plataforma |

Una cuarta dimensión, «qué cree NEXO», se abre en el inspector de una entrada/propuesta. No confundir recepción con comprensión ni comprensión con veracidad. Si NEXO aún no está integrado, mostrar esa ausencia con claridad.

### 32.2 Caudal grande, representación ligera

La columna 1 puede avanzar de manera abrumadora para transmitir escala, pero el caudal corresponde a eventos del motor. Separar eventos operativos de publicaciones: 10.000 reposts no son 10.000 edificios caídos. La vista puede agrupar o muestrear; debe mostrar total, tasa, filtrados y límite visible.

Virtualizar filas, mantener un buffer visible acotado y persistir el registro fuera del DOM. Botón para congelar solo el feed visual; el mundo sigue avanzando salvo pausa explícita. Mostrar contador de eventos pendientes mientras se lee. Búsqueda, filtros, exportación y «seguir este caso» permiten investigar sin detener todo.

### 32.3 Fake news y vínculos causales

En modo observador puede marcarse en rojo/coral una afirmación falsa conocida por el evaluador, con etiqueta **«verdad del simulador: no visible para NEXO»**. Distinguir falso, antiguo, parcialmente correcto, ubicación equivocada e incierto. En modo NEXO se muestra únicamente su clasificación observada y su evidencia.

Al seleccionar una tarjeta, iluminar su edificio/sector y mostrar vínculos entre evento, publicaciones, ingesta, investigación, autorización y consecuencia. Esos enlaces privados solo están disponibles al observador; en la plataforma se utilizan referencias públicas/permitidas. No dibujar permanentemente miles de líneas.

### 32.4 Ejemplo visible de brecha

09:10 ocurre daño; 09:12 se graba un clip sin conexión; 09:40 se publica; 09:43 el scraper lo descubre; 09:44 NEXO lo acepta; 09:47 un operador autoriza una verificación. La visualización debe mostrar los intervalos reales de esa ejecución, no tiempos pregrabados. El inspector permite identificar si el problema estaba en la red, ingesta, interpretación o atención humana.

## 33. Catálogo de escenarios observables de aceptación

Cada escenario se entrega como fixture legible, generador de variantes, criterios de éxito/fallo y receta de cámara/inspector para hacerlo visible. Las horas y cantidades del ejemplo de la landing son datos ficticios del fixture, no metas obligatorias del sistema.

| ID | Situación y entradas clave | Acción/consecuencia a observar | Evidencia visual y criterio |
|---|---|---|---|
| S01 | Los Sauces necesita 600 L; una opción llega tarde, otra solo carga 300 L; nota de regreso vacío | Investigar carga, horario, permiso y retorno; dos envíos si son viables | Seguir ambos vehículos, 300+300 recibidos y demora por etapa; permitir fallo si un requisito cambia |
| S02 | Escuela candidata sin agua/saneamiento/personal; capacidades repartidas | Coordinar inspección, permisos, insumos y turnos | Edificio permanece candidato hasta cumplir dependencias; apertura y personas atendidas |
| S03 | Planta intacta detenida y generador de otro uso | Comprobar compatibilidad, reserva, traslado, instalación y autorización | Producción solo comienza al completar condiciones; medir refugios abastecidos |
| S04 | Video antiguo de bloqueo viral, evidencia reciente contradictoria | Contrastar fecha/lugar; conservar incertidumbre pertinente | Conectar origen/copia/corrección; un video falso no abre por sí solo la vía |
| S05 | Incendio cambia acceso durante una evacuación | Actualizar plan y comunicar al responsable/conductor | Frente abstracto, ventana de paso, orden en tránsito y efecto del retraso |
| S06 | Sismo seguido de réplica invalida refugio o acceso | Revisar inspección/operaciones dependientes | Cambio de capacidad y reparación parcial, sin cancelar todo indiscriminadamente |
| S07 | Comunidad urgente sin publicaciones frente a otra muy viral | Detectar cobertura insuficiente y pedir verificación | Verdad muestra ambas; NEXO solo descubre la silenciosa por canal permitido |
| S08 | Publicaciones duplicadas inflan demanda aparente | Relacionar fuentes sin borrar casos independientes | Demanda real frente a estimada, sobreasignación y falsas fusiones |
| S09 | Muchas necesidades comparten pocos vehículos y operadores | Resolver propuestas incompatibles y prioridades autorizadas | Reservas/colas y atención final; ninguna doble reserva aceptada |
| S10 | Dos ONGs intentan reservar el mismo generador durante un corte | Confirmar, rechazar o caducar coherentemente | Una propiedad física, cronología de mensajes y conflicto explícito |
| S11 | Socio retira personal/recurso después del despacho | Mantener acuerdos útiles y reparar dependencias | Ver qué vehículo sigue, cuál recibe nueva orden y qué coste ya se incurrió |
| S12 | Orden de desvío autorizada no llega al conductor | Esperar canal/reintentar con idempotencia | Última posición conocida versus real y momento efectivo de nueva ruta |
| S13 | Regresa conexión y aparecen cientos de reportes antiguos | Ordenar vigencia y actualizar sin sobrescribir hechos recientes | Ráfaga en columna 2, procesamiento en 3 y errores de antigüedad |
| S14 | Transporte llega, pero no hay equipo para descargar/instalar | Coordinar complemento faltante | Diferenciar llegada, recepción y servicio; cola en destino |
| S15 | Mucha oferta de un insumo y carencia de otro; envíos en camino | Considerar compromisos y suministro futuro fiable | Exceso evitado, reserva útil y demanda restante por tipo |
| S16 | Fuente manipuladora o confirmación suplantada | Rechazar autoridad falsa y no revelar datos privados | Intento y denegación visibles al auditor; mundo sin cambio no autorizado |
| S17 | NEXO/Gemini o una herramienta falla bajo carga | Degradación y conservación de compromisos | Estado útil, cola y recuperación; sin inventar resultados de consultas |
| S18 | No hay combinación factible o investigar demora demasiado | Plan parcial, verificación selectiva o abstención | Restricción visible, ayuda parcial y comparación con actuar antes |
| S19 | Cuatro organizaciones y una quinta sin NEXO | Consulta limitada y compromisos de socios heterogéneos | Ámbitos separados, permiso por actor, servicio conjunto y coste de coordinación |
| S20 | Donación, compra y entrega parcial | Libro agregado y publicación revisada por organización | Recaudado/preparando/en camino/recibido; no entrega por el hecho de donar |
| S21 | Ruptura de esquema, API limitada o posts borrados | Adaptar ingesta y reconocer cobertura faltante | Diferencia entre publicado, accesible, descargado y entendido |
| S22 | Topónimos/unidades/idiomas ambiguos | Preguntar o contrastar antes de reservar/entregar | Ubicación corregida, conversión justificada y coste de aclaración |
| S23 | Un proceso convencional ya tiene información suficiente | Ejecutar referencia competente sin ventaja artificial de NEXO | Caso sin ganancia o con sobrecoste; mantener resultado desfavorable |
| S24 | Patrón pasado parece útil pero una condición local difiere (H1) | Revalidar o rechazar transferencia | Comparación con/sin memoria y posible transferencia negativa; ampliación opcional |

S01–S23 son cobertura del núcleo previsto, no veintitrés demos que deban mostrarse juntas. Cada uno tendrá al menos una variante favorable, una adversa y una sin solución trivial. Las variaciones reservadas deben cambiar dependencias/restricciones, no solo nombres o posiciones.

Para S02/S03/S19, comparar una instancia y una red con dotación controlada. Separar el beneficio de añadir recursos del beneficio de coordinar los mismos recursos. Para S09, incluir un objetivo de carga de 100 necesidades heterogéneas concurrentes; no afirmar 100 soluciones/minuto hasta medirlo.

## 34. Métricas, comparaciones y atribución de resultados

### 34.1 Cuadro de medidas por capa

| Capa | Medidas obligatorias |
|---|---|
| Mundo / necesidad | Necesidad total y atendida por servicio, evolución, cobertura parcial, población agregada sin duplicación y tiempo sin atención |
| Observación | Fracción observada/reportada, zonas silenciosas, demora hasta primera señal útil y dependencia entre fuentes |
| Acceso e ingesta | Publicado frente a accesible/descubierto/descargado/aceptado, demora, cuota, errores, descarte y cobertura por comunidad |
| Interpretación | Necesidades omitidas, falsas alarmas, fusiones incorrectas, ubicación/unidad equivocada, afirmaciones sin evidencia y calidad de incertidumbre |
| Investigación | Consultas realizadas, coste/tiempo, comprobaciones que cambian una opción y alternativas válidas descubiertas |
| Coordinación | Conflictos, compromisos vencidos/incumplidos, reservas huérfanas, negativas, tiempo hasta acuerdo y perjuicio desplazado a otros servicios |
| Operación | Preparación, cola, salida, viaje, llegada, descarga, instalación y servicio; combustible, carga útil, viajes fallidos y exceso asignado |
| Personas operadoras | Cola, minutos de revisión, aclaraciones, aceptación/rechazo, errores y decisiones revisadas de verdad |
| Sistema | Coste, llamadas, errores, reintentos, latencias p50/p95, memoria, throughput y velocidad efectiva |

Ningún contador de propuestas ni una animación se computa como ayuda. Mantener cantidades por tipo; para indicadores agregados explicitar ponderaciones aprobadas y sensibilidad. No convertir minutos en vidas salvadas sin un modelo de resultado independiente y validado; ese modelo no pertenece al alcance inicial.

### 34.2 Experimentos mínimos

Comparar: coordinación competente; conectores/reglas/optimizador; Gemini como extractor; agente general con Gemini y herramientas comparables; NEXO investigando; NEXO con cooperación entre instancias. No usar la lentitud artificial de una referencia para fabricar una mejora.

Para el aporte del modelo, igualar acceso y presupuestos pertinentes. Para el aporte de la red, conservar dotación agregada y permitir comunicación convencional. Para el aporte de la investigación, retirar esa capacidad manteniendo el resto. Para escala, incrementar diversidad y competencia además del volumen de mensajes.

Separar desarrollo, validación y evaluación reservada. Repeticiones emparejadas, incertidumbre, percentiles y resultados por subgrupo. Fijar diseño y métricas antes de ver la evaluación final. Mostrar escenarios donde NEXO tarda más, no aporta o se equivoca, y explicar la condición que los causa.

### 34.3 Reconstrucción de un resultado

Un clic en una cifra del evaluador abre entidades, eventos y regla que la calculó. Una mejora debe seguirse desde la señal decisiva hasta atención efectiva. Registrar también efectos negativos: otra comunidad esperó más, un recurso quedó bloqueado o se gastó una verificación inútil.

## 35. Rendimiento y arquitectura ligera

### 35.1 Separación de costes

- Núcleo sin render, motor de eventos, grafos y estados compactos. Instanciar individuos solo cuando una tarea o decisión requiera identidad.
- Procesos/workers separados para simulación, servicio de fuentes, integración NEXO y render. Si una pantalla se ralentiza, aplicar presión de cola a su proyección, no perder eventos del mundo.
- Visor con geometría compartida/instanciada, niveles de detalle, recorte fuera de cámara y límites de etiquetas. Sin físicas de rigid bodies, texturas pesadas ni videos reales en el modo textual.
- Muestreo/coalescencia solo en visualización y telemetría no crítica. El registro autoritativo conserva cada cambio necesario para reproducir y evaluar.
- Red social con filas virtualizadas y paginación. Un millón de posts no requiere un millón de nodos DOM ni permanecer entero en memoria.
- Trayectorias interpoladas para render; rutas y tiempos calculados por el motor. Guardar eventos de cambio, no posiciones de cada frame.
- Snapshots periódicos más log append-only comprimible; índices de entidad, tiempo y operación para replay y consulta.
- Batches de simulaciones con límite explícito de CPU, memoria, disco, llamadas Gemini y gasto. Cancelación limpia y reanudación por checkpoint.

Una implementación inicial puede compartir esquemas tipados entre motor y frontend; la elección de runtime, renderer y almacenamiento se decide con un prototipo de rendimiento. No introducir bases distribuidas ni un LLM por actor para simular la escala. Mantener el motor portable y evaluable sin servicios externos salvo en pruebas de integración.

### 35.2 Presupuestos que se deben medir

Establecer una máquina de referencia y registrar CPU, RAM, sistema operativo y runtime. Medir motor solo, servidor de fuentes, visor y NEXO conectado por separado. Objetivo orientativo del visor: interacción fluida a 30–60 FPS según dispositivo; no usar FPS como medida de velocidad de respuesta humanitaria.

Perfiles de estrés sintéticos, sin afirmar que representan frecuencias universales de un desastre:

| Perfil | Composición inicial propuesta | Verificación |
|---|---|---|
| Unitario | 1 sector, 1–3 necesidades, pocos vehículos y eventos | Resultado comprobable manualmente |
| Ciudad | Decenas de comunidades, centenares de lugares, miles de publicaciones por episodio | Integridad, tráfico y colas con visor |
| Regional | Miles de lugares relevantes, varias organizaciones, 100 necesidades interdependientes concurrentes | Beneficio de la red, atención humana y fuentes heterogéneas |
| Saturación de información | Barridos de 10.000 a 1.000.000 de publicaciones generadas por episodio | Capacidad de almacenamiento/ingesta, muestreo visual y ausencia de pérdidas silenciosas |
| Lote | Múltiples seeds y variantes sin gráficos | Determinismo, aislamiento y coste total |

La duración del episodio y la tasa de publicación se configuran aparte. Escalar millones de mensajes no implica millones de llamadas a Gemini. Los rangos son metas de prueba, no capacidades ya prometidas. Si ×1000 no se alcanza en un perfil, reportar velocidad real, cuello de botella y máxima carga sostenible.

## 36. Verificación del simulador antes de evaluar NEXO

### 36.1 Invariantes del mundo

- Conservación de recursos: inicial + producido + recibido = restante + consumido + perdido + transferido, con cuentas por ubicación y propietario.
- No duplicar personas/cohortes al moverlas, agregarlas o representarlas con figuras en pantalla.
- No entregar antes de salir/llegar ni prestar servicio antes de cumplir dependencias.
- No mover vehículos por una vía físicamente incompatible sin que el motor lo marque como fallo; una recomendación equivocada no cambia el mapa.
- No ejecutar por recibir una publicación; hace falta el flujo de autoridad definido.
- No conceder dos reservas exclusivas simultáneas; no confundir disponibilidad declarada con autorizada.
- No conocer observaciones antes de que sean accesibles; no filtrar futuro o verdad privada por ninguna herramienta.
- Idempotencia ante reintentos y conservación de versiones ante mensajes desordenados.
- Estados imposibles producen un error de validación visible, no una corrección silenciosa que favorezca NEXO.

### 36.2 Pruebas funcionales y de propiedades

1. Mismo manifiesto y acciones → mismo hash final y secuencia de eventos del mundo; repetir con render apagado/encendido y distintas velocidades de cámara.
2. Replay desde checkpoint → mismo resultado que ejecución completa.
3. Una llamada extra de una solución no cambia el azar exógeno de la otra.
4. Cortar conexión retrasa publicaciones/órdenes pertinentes; reconectar entrega pendientes con antigüedad y límites de cola.
5. Aumentar distancia sin otra modificación no reduce el tiempo libre del mismo vehículo; aumentar capacidad de una vía no debe empeorar por un error aritmético el mismo flujo fijo. En bucle cerrado, no exigir monotonía global: nuevas decisiones pueden cambiar rutas y congestión.
6. Cerrar una instalación reduce su capacidad efectiva; su reapertura exige los requisitos definidos.
7. Inyectar una mentira no altera la verdad; puede alterar las decisiones de actores que la creen.
8. Duplicar un mensaje no duplica físicamente la necesidad ni las existencias.
9. Aumentar el zoom o abrir un inspector no concede datos adicionales a NEXO.
10. Un scraper solo puede obtener lo expuesto; probar metadatos, rutas de error y sesiones cruzadas.
11. La columna de consumo coincide con acuses reales; pérdida de telemetría se muestra como desconocida.
12. Misma traza → mismas métricas recomputadas por un evaluador independiente.

### 36.3 Pruebas del generador y calibración

Revisar distribución de distancias, servicios, recursos, cobertura, idioma, publicación y demoras. Hacer que casos imposibles, rumores masivos, comunidades silenciosas y cooperación parcial existan por configuración, no como excepciones escritas a mano solo para una demo.

Para cada supuesto decisivo guardar fuente o justificación, rango, incertidumbre, revisión externa pendiente y sensibilidad. La complejidad del generador no convierte sus parámetros en reales. Usar casos pequeños con resultado conocido para comprobar motor y evaluador antes de estudiar políticas complejas.

## 37. Plan de implementación y artefactos a producir

Esta secuencia construye el alcance completo por capas verificables. No elimina las capacidades de gran escala ni el visor 3D; evita que un error del mundo parezca una mejora de Gemini.

| Fase | Entregable | Criterio para avanzar |
|---|---|---|
| F0 — Contratos | Esquemas de I01–I26/O01–O23, unidades, manifiesto, autoridad y eventos | Fixture pequeño válido y frontera pública/privada comprobable |
| F1 — Núcleo | Reloj, PRNG, eventos, checkpoints, recursos, necesidades y operaciones | Determinismo e invariantes; ejecución headless |
| F2 — Geografía/logística | Generador de grafo, vehículos, tráfico, carga, descarga y refugios | S01/S02/S14 con tiempos y cantidades verificables |
| F3 — Desastres/comunicación | Sismo, incendio, inundación; cobertura, órdenes y percepción | S05/S06/S12/S13 sin conocimiento instantáneo |
| F4 — Información | Web social scrapeable, portales/herramientas, biblioteca de 360 presets | Eventos causan señales; falsedad y verdad aisladas; cobertura I01–I26 según alcance |
| F5 — Visor | Cámara isométrica, selección, seguimiento, capas y tres columnas | Mismos resultados con/sin render; escalas y huecos de información visibles |
| F6 — Actores/cooperación | Permisos, operadores, compromisos, socio sin NEXO, libro público ficticio | S09/S10/S11/S19/S20; ninguna acción sin autoridad |
| F7 — Integración | Adaptadores, acuses de ingesta, NEXO/Gemini real, fallos de herramientas | Recorrido cerrado desde post descubierto hasta servicio; sin guion de decisiones |
| F8 — Evaluación | Referencias competentes, escenarios reservados, lotes y métricas | Comparaciones reproducibles y resultados negativos preservados |
| F9 — Escala | Optimización, perfiles regionales, ×1000 donde sea viable, costo/latencia | Presupuestos medidos; trazas y métricas íntegros bajo carga |
| H1 — Ampliación | Transferencia de patrones entre desastres | Solo después del núcleo; beneficio y transferencia negativa medidos |

Artefactos propuestos del futuro repositorio del simulador:

```text
contracts/                 esquemas públicos, acciones y esquemas privados separados
engine/                    eventos, reloj, PRNG, estado y restricciones
generators/                mapas, fenómenos, actores, comunicaciones y publicaciones
scenarios/                 fixtures S01–S24 y variantes, sin secretos reales
content/                   presets revisados y variantes lingüísticas
sources/                   web social y servicios de fuentes simuladas
adapters/                  contratos hacia NEXO y referencias
viewer/                    mapa 3D, observatorio e inspectores
evaluation/                métricas, comparaciones e invariantes
manifests/                 configuraciones y versiones de experimentos
tests/                     determinismo, causalidad, permisos y regresiones
runs/                      logs/checkpoints/resultados; fuera de Git por defecto
```

Los conjuntos reservados y la verdad privada no se montan en el entorno del agente evaluado. Publicar más adelante un benchmark requiere separar lo que puede distribuirse de lo que debe mantenerse reservado durante la evaluación.

Operaciones de CLI propuestas para desarrollar después: `validate`, `generate`, `run`, `batch`, `replay`, `fork`, `compare`, `export`. No son comandos disponibles todavía. Cada una debe devolver identificador de ejecución y manifiesto, no depender de un estado invisible del navegador.

## 38. Matriz de cobertura de la plataforma y de la solicitud

### 38.1 Capacidades de NEXO → pruebas visibles

| Capacidad | Entradas/salidas principales | Escenarios | Lo que se ve y se mide |
|---|---|---|---|
| Interpretar gran volumen heterogéneo | I01–I06, I18; O01–O04 | S04/S08/S13/S21/S22 | Tres columnas, demoras de ingesta y errores de interpretación |
| Investigar una posibilidad implícita | I04/I09–I11/I20; O04–O08 | S01/S03/S18 | Señal → consulta → alternativa validada o descartada |
| C1 — Servicio compuesto | I07–I12/I15–I20; O08–O15 | S02/S03/S19 | Instalación pasa a servicio útil solo tras completar dependencias |
| C2 — Compromisos condicionados | I16/I17/I19/I25; O09/O10 | S09/S10/S19 | Condiciones, conflictos, vencimiento y autorización |
| C3 — Valor de preguntar | I20/I23/I25; O04/O05/O22 | S07/S18/S22 | Consultas que cambian decisiones frente a demora añadida |
| C4 — Recursos en competencia | I08–I17; O06–O16 | S09/S15 | Cobertura conjunta, reservas y perjuicio desplazado |
| C5 — Reparación ante cambios | I17/I20/I21/I24; O17–O19 | S05/S06/S11/S12 | Dependencias afectadas, acciones conservadas y coste irreversible |
| C6 — Capacidad humana | I15/I19/I25; O05/O07 | S09/S17/S18 | Cola de revisión y ayuda efectiva por esfuerzo total |
| C7 — Autonomía/cooperación parcial | I14–I17/I23; O08–O10/O17 | S10/S13/S19 | Operación local, socio sin NEXO y sincronización coherente |
| Desinformación y cobertura | I01–I07/I14; O02–O05/O21 | S04/S07/S08/S16 | Falsos positivos, rumores, comunidades omitidas y verificación |
| Apoyo logístico | I11–I14/I24; O11–O15 | S01/S05/S12/S14 | Movimiento físico, ETA, orden recibida y servicio |
| Transparencia y apoyo público | I21/I22/I25; O16/O20 | S20 | Fondos, compra, envío, recepción y privacidad agregada |
| Resiliencia técnica | I23; todas las acciones afectadas | S10/S13/S16/S17/S21 | Degradación, coste, permisos, datos pendientes y recuperación |
| H1 — Memoria, opcional | I26; O23 | S24 | Revalidación contextual y transferencia negativa |

### 38.2 Peticiones explícitas del autor

- [ ] 3D básico estilo Primer: edificios-prisma, personas geométricas y vehículos simples; §31.
- [ ] Cámara isométrica navegable, zoom y seguimiento de un camión; §31.
- [ ] Lugares que necesitan ayuda, refugios candidatos y recursos que permiten abrirlos; §19/§33.
- [ ] Inventario completo del alcance actual de inputs y outputs de NEXO; §17/§18/§38.1.
- [ ] Tráfico y tiempos A→B, carga/descarga, espera y cambios de destino; §22.
- [ ] Demora de instrucciones, pérdida de internet, órdenes pendientes y reconexión; §23.
- [ ] Incendio forestal, terremoto e inundación con interacciones causales; §24.
- [ ] Prioridad funcional y generación de datos sobre realismo gráfico; §16/§20/§35.
- [ ] Red social ficticia que NEXO debe descubrir y scrapear; §25/§28.
- [ ] Tres columnas: realidad, comunicación y consumo real de la plataforma; §32.
- [ ] Fake news distinguibles al observador, sin pista secreta para NEXO; §25/§28/§32.
- [ ] Caudal de información grande y percepción de caos sin saturar DOM/memoria; §32/§35.
- [ ] Control temporal, ×1000 solicitado, headless y múltiples simulaciones; §29/§35.
- [ ] Seed reproducible, streams independientes y registro de respuestas no deterministas; §30.
- [ ] Centenares de presets: mínimo 360, causales y variados; §26.
- [ ] Objetos de video con descripción y play, sin cargar video real; límites multimodales explícitos; §25.3.
- [ ] Evento como edificio caído genera observaciones, videos y solicitudes según percepción/conexión; §20/§25.
- [ ] Mapas regionales grandes, procedurales y ajustables; §21.
- [ ] Simular solo lo que afecta a percepción, acción y resultados, más visor para demo; §16.
- [ ] Todos los ejemplos del concepto y casos difíciles visibles e inspeccionables; §33.
- [ ] Requisitos para una candidatura fuerte: atribución de Gemini, capacidad colectiva, impacto y uso; §34/§36/§39.

Esta lista verifica cobertura del diseño. Marcarla como implementada solo con evidencias de prueba, no por haber escrito el requisito. Cada cambio futuro de plataforma debe indicar qué I/O, entidades, casos y métricas añade o modifica.

## 39. Definición de terminado y siguiente decisión

El laboratorio está listo para evaluar el núcleo de NEXO cuando:

1. Todos los I/O del alcance implementado tienen contrato, permisos, errores y retrasos; lo excluido está declarado.
2. S01–S23 se pueden ejecutar e inspeccionar, con variantes y sin resultado ganador prefijado; S24 se exige solo si se desarrolla H1.
3. La seed y el manifiesto reproducen el mundo con las mismas acciones; se distingue replay de nuevas inferencias.
4. El mundo sigue siendo correcto sin visor; cámara, detalle y velocidad visual no cambian sus resultados.
5. Scraping e ingesta recorren fuentes limitadas realmente; los acuses permiten comprobar qué recibió NEXO.
6. Los fallos de comunicación, permisos, tráfico, competencia y correcciones producen consecuencias físicas y operativas, no solo avisos decorativos.
7. El evaluador calcula atención efectiva, demoras, errores, costes y efectos por comunidad desde eventos independientes.
8. Existen referencias competentes, variantes con el mismo Gemini y escenarios reservados; la comparación usa recursos y límites comparables.
9. Se han medido rendimiento y velocidad efectiva en una máquina documentada; no se pierde información para alcanzar ×1000.
10. Supuestos y rangos están registrados; los que cambian la conclusión reciben sensibilidad y revisión externa cuando sea posible.
11. El visor permite entender dónde está la necesidad, qué descubre NEXO, qué se autoriza, cuándo llega una orden y cuándo se presta ayuda.
12. Toda afirmación de mejora se puede reconstruir; ninguna cifra inventada de la landing se trata como resultado obligatorio.

Estos criterios buscan una contribución defendible en técnica, impacto, innovación y UX. No convierten el número de features, presets o agentes en garantía de 100/100 o primer puesto.

**Primer corte para construir:** S01 y S02 con un pequeño grafo, una pérdida de conexión, una publicación engañosa y un recurso compartido. Deben recorrer señal → ingesta → investigación → autorización → viaje → servicio. Congelar contratos y verificar el motor; después extender los mismos mecanismos a región, incendio y carga masiva. El objetivo final sigue siendo el alcance completo descrito aquí.


## 40. Cambios implementados para el cierre local

La composición de capacidades tiene variantes internas declaradas: standard, distributed, incompatible, unsafe, insufficient_staff, occupied y delayed. Cambian cantidades/dependencias/dueños/calificaciones/capacidad del mismo mundo para todos los brazos. Una plaza útil cuenta cuando hay ocupación autorizada; una planta/edificio activado sin uso no suma atención efectiva. La evaluación de estas variantes no se denomina holdout externo.

Una orden de reroute modifica la operación existente y conserva ID, vehículo, carga y destino/recibo. La reparación de NEXO se considera terminada cuando esa operación se resuelve físicamente, no por otro camión nuevo. Cancelación recibida y carga físicamente devuelta son estados distintos. Evacuación ya reservada conserva su compromiso al rerutearse sin crear plazas nuevas.

El ledger de carga masiva usa createResource y campos de conservación completos; no añade stock solo al candidato. Se comprueban todas las invariantes antes/después del contraste. Los resultados del motor y los del proveedor se registran por separado.

La revisión añade pruebas de variantes, conservación de cargo en reroute y compatibilidad/ocupación. [CIERRE_LOCAL.md](CIERRE_LOCAL.md) y [VALIDACION.md](VALIDACION.md) enlazan implementación, build, pruebas y límites. No se reescribe la auditoría inicial ni se elimina una campaña fallida después de corregir el motor.

### 40.1 Resultado del cierre — 13 de octubre de 2026, Tokio

El motor pasa **120 pruebas** en la verificación conjunta final, mantiene 26 entradas/23 acciones y 360 presets. El laboratorio se probó con proveedor real, cuatro instancias y un socio externo, mapas/observaciones limitadas al actor, composición, carga física concurrente, red y reparación sobre la misma carga. Las etiquetas de verdad/fake y manifiestos de puntuación quedan fuera del candidato.

La evaluación conserva 36 outcomes principales, 21 estructurales con abort histórico, siete referencias corregidas y seis mundos de carga física. El probe de transporte monitoriza las 1.000 publicaciones generadas hasta incluir uploads tardíos en las cuatro organizaciones: 4.000 pares medidos sin pérdida. La prueba de semántica mide otro corpus y no utiliza los acuses como comprensión.

La simulación no garantiza una victoria: B6 no logró una ventaja robusta sobre B5/B7 ni el target de tiempo K07. Los resultados negativos son una salida válida del evaluador, no un defecto a eliminar para que el candidato siempre gane. El realismo operacional, el baseline profesional y el holdout externo requieren revisión independiente. [Resultados y huellas](VALIDACION.md#13-resultados-finales-de-la-entrega-local--13-de-octubre-de-2026-tokio) evitan heredar silenciosamente un resultado tras corregir una referencia.

## 41. Información antes del informe formal: nuevo estrato de evaluación

### 41.1 Por qué hace falta y qué resultados no se reemplazan

Las primeras campañas comparaban coordinación sobre demandas ya estructuradas. S23 entrega el ticket formal desde el inicio; la carga física masiva también notificaba cada necesidad a todas las organizaciones antes de publicar el ruido social. No había una brecha de interpretación que NEXO necesitara cerrar. El planificador convencional competente podía distribuir directamente; investigar lo mismo otra vez añadía tiempo.

Conservar estos mundos como controles negativos. La nueva pregunta es: **cuando existe una necesidad física y solo hay reportes públicos dispersos, ¿NEXO puede obtener una comprobación responsable y hacer llegar ayuda útil antes que un proceso competente de referencia?** La respuesta depende tanto del producto como del trabajo de lectura, los canales de comprobación y el tiempo físico de transporte. No basta con añadir más edificios o publicaciones a un mundo donde todos los tickets ya vienen tipados.

### 41.2 Contrato del generador ya implementado

El evaluador puede importar `generators/response-benchmark.mjs` y llamar `installResponseBenchmark(world, options)` antes del primer avance. El generador no es un agente y no prepara una asignación para NEXO.

| Parámetro | Valor diagnóstico inicial | Qué cambia |
|---|---:|---|
| `count` | 12 | Necesidades físicas positivas, una por edificio residencial distinto |
| `noise` | 48 | Originales públicos de contexto, rumores, archivo y solidaridad |
| `reposts` | 2 | Copias por solicitud, con lineage público deduplicable por ambos brazos |
| `reportAt` | 15.000 ms | Primer reporte social desde la necesidad física |
| `staggerMs` | 2.000 ms | Separación entre reportes de distintas necesidades |
| `formalDelayMs` | 1.800.000 ms | Retraso del canal formal respecto a cada reporte social |
| `explicitFraction` | 1/3 | Proporción esperada de redacciones reconocibles por un patrón convencional simple |
| `silentFraction` | 0 | Fracción esperada sin publicación social, que sigue contando como demanda |
| `replaceDefaultNeed` | `true` | Retira antes del test la demanda piloto fija para que no confunda la cohorte |

Estos valores son opciones experimentales. Ningún valor se anuncia como demora real típica de una ONG o una tragedia. El generador valida tamaños, fracciones, lugares suficientes y que el informe formal ocurra dentro del horizonte. No modificar el mundo para favorecer un brazo después de conocer su resultado.

La función devuelve configuración, manifiesto y gold al evaluador. El gold contiene la demanda física y sus vínculos de puntuación; no se entrega como input a la plataforma. `actorView` y `publicFeed` conservan sus proyecciones normales. Los posts no incluyen un ID privado de necesidad ni una etiqueta de falsedad. Los reportes contextuales omiten el geotag; su lugar público aparece en el texto y se resuelve contra el mismo directorio/mapa recibido por ambos.

Para reanudar un checkpoint de esta cohorte, registrar primero sus handlers: crear un `World` con la configuración original, instalar el mismo perfil y después llamar `world.restore(snapshot)`. Esto valida los eventos adicionales antes de ejecutar; no vuelve a publicar ni a crear las necesidades guardadas. La seed reproduce contenido, lugares y acontecimientos con las mismas acciones, pero una nueva llamada al modelo no es determinista por seed.

### 41.3 Causalidad y fronteras de autoridad

La necesidad se crea físicamente al tiempo cero. Más tarde un residente publica una solicitud; composición, upload, conectividad e indexación mantienen los retrasos normales. El canal formal publica una observación con demora declarada hacia todas las organizaciones, sin distinguir al candidato de la referencia. Una organización también puede descubrirla antes por la misma herramienta de aclaración/verificación de un edificio.

Secuencia válida:

```text
necesidad física
  → publicación disponible por HTTP
  → interpretación como hipótesis con fuente y versión
  → aclaración responsable del lugar público
  → observación operativa recibida
  → asignación calculada con restricciones
  → autorización de cada propietario
  → orden recibida, carga y trayecto
  → descarga y servicio efectivo
```

Una inferencia de «faltan cinco recipientes de diez litros» puede orientar una pregunta, pero no escribe directamente el ticket físico ni reemplaza la cantidad observada por el canal responsable. Un rumor de evacuación no elimina una necesidad oficial. Un post falso puede consumir atención o una comprobación; ese coste y los falsos negativos deben seguir en el resultado.

La retirada de la demanda piloto fija queda registrada y su vista formal se actualiza a cantidad cero. No contar esa fila como persona atendida instantáneamente: las métricas de atención usan demandas positivas. Mantener también las comunidades sin posts, pendientes al horizonte y las que dependen del canal formal.

### 41.4 Referencia convencional competente y atención finita

La comparación debe dar a todos los brazos el mismo HTTP, disponibilidad temporal, búsquedas, directorio de lugares, versiones, límites, inventarios, consentimientos de socios y herramienta de comprobación. No introducir una ventaja del candidato en el transporte de datos.

El proceso convencional puede utilizar sin inferencia generativa:

- Deduplicación por referencias públicas, agrupación de copias y versiones.
- Reconocimiento de IDs/lugares explícitos y búsquedas por palabras o diccionarios.
- Extracción de solicitudes con un patrón inequívoco de cantidad, unidad y tipo actuales.
- Detección de archivo explícitamente fechado y conservación de fuentes para revisión.
- El mismo compilador de asignación, restricciones, reservas y revisión por dueños que NEXO.

El trabajo que esas reglas no resuelven entra en una cola de lectura con duración y cantidad de trabajadores declaradas. No descartar silenciosamente solicitudes difíciles para hacer una referencia débil. La interpretación humana scriptada del laboratorio debe ser competente y rastreable; todavía no es una prueba de comprensión de personas reales. La cola no puede leer la etiqueta privada `false` ni el gold de evaluación para resolver un mensaje.

Separar tres capacidades: leer fuentes, comprobar por un canal responsable y autorizar acciones. Dos operadores que autorizan no equivalen automáticamente a dos operadores disponibles para leer cada fuente a la vez. Si se usa un pool compartido, las tareas compiten en ese pool; si son equipos distintos, declararlo. Mantener finitos los turnos, inspecciones, vehículos, stock y recepción.

NEXO paga por sus llamadas reales y sus tiempos modelados/medidos. La interpretación de lotes no sustituye la comprobación física ni elimina la aprobación humana. El planificador determinista es compartido precisamente para que la diferencia observada no sea una referencia que distribuye mal por diseño.

### 41.5 Sensibilidad requerida

Congelar perfiles antes de ejecutar y guardar todos los resultados, incluso los adversos:

| Eje | Controles y variaciones que deben explorarse |
|---|---|
| Tiempo de lectura | 0 s como control de interpretación gratis; después rangos plausibles declarados, por ejemplo 10/30/60 s por original difícil |
| Personal de lectura | 1/2/4/8 trabajadores o el roster explícito elegido; no elegir solo la dotación donde NEXO gana |
| Canal formal | Sin demora; demora breve; media; prolongada. Un canal formal rápido puede hacer innecesaria la inferencia |
| Redacción | Todas explícitas; mezcla; contextuales; negaciones, archivo, versiones y ubicación ambigua |
| Caudal | Pocos originales; muchos originales; muchas copias de los mismos; no confundir copias con tareas independientes |
| Comprobación | Aclaración rápida; equipo de campo y viaje; respuesta inconclusa; cortes; cupo finito |
| Demanda | Capacidad suficiente; escasa; nueva demanda de otro tipo en un lugar ya conocido; comunidades silenciosas |
| Logística | Distancias pequeñas y regionales, tráfico, recepción limitada, vehículo que vuelve, combustible y cambios de acceso |
| Modelo | Latencia modelada declarada, latencia real ×1, fallo, presupuesto agotado, mismo modelo genérico y posteriormente Gemini |

No es obligatorio completar cada cruce cartesiano para un primer diagnóstico. Sí declarar qué rango se cubrió y qué condición cambia la conclusión. Una reducción aparente que desaparece con lectura de 10 s o cuatro trabajadores exige acotar el claim; un resultado robusto en el rango ensayado es evidencia interna del mecanismo, no una calibración de campo.

La probabilidad de respuesta de aclaración actual se deriva de un ID de inspección. Cambiar el orden de consultas puede cambiar esas realizaciones aunque la seed del mundo coincida. Para la primera comparación causal, usar observabilidad determinista y registrar ese límite. En perfiles estocásticos registrar consultas, IDs, tiempos y réplicas; no anunciar que cada brazo recibió exactamente la misma respuesta factual si sus acciones cambiaron la secuencia.

### 41.6 Métricas, controles y evidencias

Métrica principal del diagnóstico: tiempo desde aparición física hasta primera ayuda útil y hasta la cantidad suficiente para esa necesidad. Guardar recepción/servicio desde eventos del motor, no desde el texto del agente. Informar mediana y cola, censura, cobertura y déficit acumulado por unidad nativa. Un percentil de completados sin los no atendidos puede ser engañoso.

Implementación de medición: `serveNeed` guarda `firstServiceAt` en la primera contribución física positiva a la demanda restante; `completedAt` sigue representando cantidad suficiente. `perCommunity` exporta `firstServiceAt` y `sufficientServiceAt`; `response.firstUsefulServiceMs` y `response.sufficientServiceMs` conservan sus censuras propias. `needToServiceMs` queda como alias compatible de la segunda métrica. La demanda piloto retirada no entra en esos denominadores ni en el conteo de cumplimiento. Una llegada, una cantidad cero o un exceso sobre demanda ya inexistente no crean primera ayuda útil.

Métricas explicativas: disponibilidad→ingesta→interpretación→comprobación; solicitudes correctas descubiertas; falsas hipótesis que pidieron trabajo; consultas improductivas; espera por revisión; tiempo de recurso útil sin trabajo; propuestas parciales pendientes; coste real del modelo; tokens; llamadas repetidas; stock y capacidad preservados. Mantener fallos e inconclusos en los denominadores.

Atribución mínima:

1. Información conocida desde el inicio: compilador directo versus NEXO, control donde el modelo puede perder.
2. Información pública contextual: proceso convencional competente versus percepción NEXO y compilador compartido.
3. Misma percepción generativa y recursos, sin continuidad dirigida: distingue extracción de una respuesta que llega a completarse.
4. Mismo modelo genérico, si el claim es ventaja del sistema sobre un agente general.
5. Un operador/equipo aislado y varios conectados, si el claim es capacidad colectiva.

Cada pareja incluye build del motor, candidato, evaluador y modelo, configuración base, manifiesto adicional de la cohorte y `corpusHash`, reloj, presupuesto, parada y protocolo de exclusión. No comparar perfiles de demora distintos como si solo cambiara NEXO. Las campañas negativas anteriores permanecen enlazadas en [VALIDACION.md](VALIDACION.md).

### 41.7 Aceptación del nuevo mecanismo

- La plataforma realmente descubre y descarga publicaciones por HTTP; el evaluador no le selecciona el gold como lote de lectura.
- Los filtros y la deduplicación usan información pública y conservan desconocidos relevantes para revisión.
- El modelo real produce interpretaciones con fuentes/versiones; su supuesto número se comprueba y no crea autoridad.
- El canal de aclaración descubre necesidades mediante una ubicación pública, sin pedir un ID privado del ticket.
- Una comprobación pendiente o inconclusa sigue visible; una propuesta parcial no cierra el resto del lote.
- Llegada de evidencia/capacidad/ofertas reanuda el trabajo sin repetir inferencia sobre el mismo contenido.
- Cambios, borrados, cancelaciones, revocaciones y versiones invalidan la continuación que ya no corresponda.
- Recursos, vehículos y propietarios conservan sus restricciones, revisión y ledger.
- El resultado mejora sustancialmente el tiempo de servicio en los perfiles ensayados sin esconder menor cobertura, comunidades omitidas ni más daño a otras necesidades.
- Los perfiles negativos y de empate se conservan; las hipótesis se acotan al rango demostrado.

Los cinco tests del generador verifican causalidad, aislamiento, aclaración por lugar, seed/continuación, silencio y configuración válida. Las campañas de proveedor y la evaluación del producto se ejecutan aparte. Una mejora con Gemma en esta cohorte no valida las cifras inventadas de la landing, Gemini, mortalidad real ni feedback de usuarios.

## 42. Etapas de demanda, comprobaciones y trazas físicas de la nueva iteración

### 42.1 Una necesidad que vuelve no conserva un tiempo de respuesta antiguo

Si una necesidad cubierta o retirada vuelve a tener déficit por un aumento, abrir una nueva etapa con `responseCreatedAt`. Reiniciar `firstServiceAt` y `completedAt` para esa etapa; conservar el `createdAt` original y el historial `demandEpisodes`. Aumentar una necesidad todavía pendiente amplía su etapa existente. Un exceso físico anterior sigue disponible; no desaparece para fabricar un déficit.

Una retirada administrativa es un evento competidor, no una entrega exitosa. Una reducción que elimina el déficit sin entrega se registra como retiro, con tiempo observado y censura de servicio. Las métricas muestran etapa actual y episodios anteriores, unidades nativas, demanda/servicio y tiempo. El evaluador no puede restar `createdAt` original para dar a una nueva etapa el crédito de una entrega anterior.

Probar cobertura → nueva demanda → entrega parcial → suficiente, retirada → reapertura, aumento todavía pendiente, reducción sin entrega, exceso previo, snapshot/replay y métricas por comunidad. La cohorte fija de descubrimiento no cambia su reloj: esta reparación afecta demandas dinámicas y se mantiene distinguida de su comparación.

### 42.2 Aclaración y evaluación física tienen recursos distintos

`clarificationWorkers` es una cantidad finita y predeclarada de canales de aclaración disponibles por organización. Una solicitud espera un slot, invierte el tiempo de comprobación y comunica por el canal normal, con latencia, pérdida y desconexión. Dos slots no entregan resultados instantáneos. El default de uno conserva el perfil anterior; evaluar también uno/dos y no presentar ese parámetro como productividad humana medida.

La aclaración devuelve metadatos operacionales o necesidades observadas; no declara seguro un edificio. Una evaluación de seguridad operacional necesita personal con `field_assessment`, vehículo, ruta real, trabajo de campo, solicitud/propietarios autorizados, finalidad, versión y vigencia. Compartir un equipo no regala recursos: el dueño reserva su personal/vehículo y conserva control de la ejecución. Las consultas de inventario y las observaciones de recurso deben conservar sus cualificaciones reales.

El responsable sin equipo propio puede recibir una evaluación delegada. El resultado viaja por la misma comunicación, puede llegar tarde o no llegar, y contiene el método y fuente observada. Expiración, réplica, cambio material, retiro de autorización o ruta bloqueada impiden convertirlo en activación automática. Probar doble aprobación, falta de competencia, viaje/trabajo, aislamiento de verdad, recepción offline y replay; después comprobar servicio realmente ocupado.

### 42.3 Instrumentación sin información privilegiada para el candidato

Las trazas del evaluador conservan inicio de viajes de recogida/entrega, rutas escogidas al partir, distancias, ETA, recurso/necesidad/destino, cantidad y timestamps físicos. Si luego cambia la ruta, la ruta inicial no se presenta como recorrido efectivo completo. El logger no altera reloj, aleatoriedad, observaciones ni decisiones; un test compara el estado determinista con y sin instrumentación.

Separar estas trazas de los recibos visibles para el actor. El planificador y los prompts solo usan mapas, rutas, operaciones y permisos recibidos. El scoring puede usar la verdad para medir, pero jamás para elegir el siguiente lugar a investigar o la siguiente asignación.

### 42.4 Cierre reproducible

La verificación registra huellas inicial/final del candidato, evaluador y motor. Si alguna cambia, el resultado no puede declararse `passed`, aunque todos los tests individuales hayan pasado. Una suite sin casos ejecutados, con skips/fallos/cancelaciones o mezclada entre versiones tampoco cierra el gate.

Cada episodio debe comprobar nuevamente los bytes del motor y evaluador al finalizar, además del candidato. El identificador de motor cargado por ESM al arrancar no detecta por sí solo una edición posterior de archivos. Una parada solicitada se aplica en el próximo límite seguro de ronda: liquidar la inferencia ya emitida, conservar costes, recibos y órdenes existentes, no iniciar nuevas órdenes/modelos y observar la física hasta el horizonte fijo. Marcar el episodio interrumpido, no exitoso; ningún resultado faltante o coste desconocido se imputa como cero.

[MEJORA_RESPUESTA.md](MEJORA_RESPUESTA.md) conserva pilotos anteriores, defectos detectados, cambios y evidencia nueva. [El plan de seguimiento](https://github.com/Hi-io/nexo-platform/blob/main/reports/discovery-followup-plan.json) predeclara carga, semillas, referencias y sensibilidades; el protocolo de cada campaña fija la versión final antes de empezar. Una campaña detenida conserva resultados y coste desconocido, nunca outcomes inventados.

### 42.5 Frecuencia de polling no puede fabricar trabajo ni demora humanitaria

Repetir una observación física sin cambio material no representa un nuevo hecho, compromiso ni entrega. La plataforma debe conservar un solo trabajo durable de continuación por propuesta y una sola propagación del mismo recibo material. Timestamps de generación de una consulta no son una actualización de cantidad, estado, permiso, finalidad o versión de evaluación. Los timestamps que sí definen vigencia, competencia o realización de una inspección permanecen materiales.

La regresión `tests/poll-clock.test.mjs` de la plataforma ejecuta dos instancias HTTP con bases distintas, doble autorización de dueño y diez consultas tanto rápidas como espaciadas. Ambas deben conservar reloj físico, cantidad, tiempos de servicio, un solo envío y un solo viaje; no añadir transportes entre organizaciones por consultas idénticas. Un recibo material despierta la continuación durable, sin llamar directamente a la ejecución desde el fixture. Guardar esta diferencia evita interpretar latencia artificial de mensajes duplicados como burocracia real.

También comprobar cancelación/revocación/reaprobación concurrentes a un conector pendiente. Una respuesta tardía conserva el trabajo físico ya emitido, pero no devuelve autoridad anterior ni emite el siguiente paso. Un trabajo fallido sólo se rearma mediante nueva aprobación humana válida; un worker viejo, el polling o un recibo repetido no reinician el presupuesto de reintentos. El motor mantiene su propia idempotencia como segunda defensa, sin conceder crédito al producto por esos rechazos.

### 42.6 Reservas, estados terminales y stock de instalaciones

Modelar la caducidad de reserva durante viajes largos de recogida sin regalar TTL infinito ni teleportar carga. La fuente puede aceptar `ttlMs` explícito autorizado, con default de 15 minutos y máximo de 24 horas, y publicar su política por una consulta ordinaria. Validar antes de reservar para que un rechazo sea atómico. Probar el mismo recorrido largo con ventana insuficiente y suficiente; todas las referencias pueden usar el mismo contrato. Compromisos existentes conservan su vigencia original.

Publicar cada cambio material de operación, incluidos caducidad antes de cargar, falta de combustible/turno, destino inseguro, población cambiada, cancelación, retorno, reparación y observación de campo. El actor desconectado conserva su último conocimiento hasta que el nuevo reporte llegue por el canal normal. Nunca recibe el fallo mediante acceso a verdad privada. Los recibos tienen versión material monotónica: la misma observación sondeada no cambia versión, y una llegada tardía con el mismo timestamp no puede sustituir un estado terminal más nuevo.

La recepción de ayuda puede crear stock de dueños distintos en el mismo nodo. Activación y consumo del servicio usan recursos reales del dueño de la instalación, con IDs y cantidades registrados en el ledger. No confundir el ID base con disponibilidad propia ni sumar recursos ajenos. Probar entrega de otra organización consumida para una necesidad, posterior abastecimiento propio y servicio; también transferencia autorizada, aislamiento, consumos parciales y conservación.

La UI puede representar estas situaciones con geometría simple; la prueba relevante sigue siendo la interacción causal entre viaje, reserva, inventario, recepción, comunicación, servicio y autorización. En una comparación, el mismo arreglo del motor debe aplicarse al candidato y las referencias. [Registro del diagnóstico](MEJORA_RESPUESTA.md#10-el-aparente-avance-todavía-no-era-una-mejora-legítima).

### 42.7 Las competencias viajan con el personal, no con el nombre del depósito

Una transferencia bilateral de personal a un depósito y su reexpedición a un refugio deben conservar las personas y sus habilidades reales. Guardar perfiles de grupos (`qualificationProfiles`) y cuentas físicas por competencia (`qualificationCounts`); `qualifications` contiene sólo las habilidades de todas las personas que siguen en ese stock. Un grupo mixto no hereda todas las competencias del envío más reciente. Contar dos habilidades por separado no demuestra que una misma persona tenga ambas; para una tarea con varias habilidades contar la intersección de los perfiles. Si un inventario nativo contiene sólo cuentas marginales parciales, utilizar únicamente la intersección garantizada, sin inventar una correlación positiva entre habilidades.

La reserva del evaluador o del refugio retiene personas concretas. Un segundo envío no puede cargar ese mismo equipo mientras esté asignado. Retirar sus perfiles del origen al cargar, transportarlos con el vehículo y añadirlos al stock del dueño receptor después de la entrega física. Los perfiles y cantidades del stock se conocen por consultas, verificación o recibos entregados por los canales normales y consentidos; ninguna etiqueta privada del evaluador interviene. El personal comprado sin cualificaciones declaradas llega sin competencias inventadas. Una cancelación con carga exige viaje de devolución y restaura exactamente esos perfiles; un pickup fallido no consume personal. Las personas destinadas a una necesidad consumida o perdidas no dejan cuentas de competencias reutilizables.

Regresión obligatoria: aceptación de ambos dueños → viaje real → depósito recibido → evaluación física competente desde ese stock → reexpedición parcial → instalación autorizada y reservas del refugio. Añadir mezcla con personal sin cualificación, dos reservas que se cargan en distinto orden, conservación por habilidad durante división de equipos, ausencia de intersección multi-skill, cuentas nativas parciales, consumo parcial, pickup expirado, pérdida, retorno de carga, recibos/versiones y checkpoint/replay. `tests/staff-transport.test.mjs` cubre siete casos y forma parte de la suite de 173 pruebas del motor `bb307da98907240bf04aa7a9bcf6675efd74a7dac6b216cddc346b964b14680c`. Esto cierra consistencia de física y observación en los casos probados; no acredita ventaja del modelo ni calibración externa de competencias.

### 42.8 Selección aprobada de personal y cantidad real admitida

Un stock mixto sólo puede prometer una habilidad si existe cantidad física cualificada no reservada. `dispatch`, `commitment` y `transfer` aceptan un selector explícito y acotado `staffSkills`. El dueño aprueba esas habilidades junto con cantidad/destino; un receptor no puede cambiar el selector al aceptar y una orden no puede convertir una reserva genérica anterior en personal cualificado. La reserva retiene perfiles concretos, que siguen con el vehículo y se incorporan al stock del receptor únicamente después de la recepción física. Conservar perfiles durante consumo, pérdida y devolución, sin unir habilidades de personas distintas ni atribuir competencias a compras genéricas.

Compartir ese stock con otra instancia NEXO expone sólo agregados consentidos: cantidad, reserva, mínimo protegido, cualificaciones comunes, cuentas y perfiles anónimos. Los nombres y elecciones privadas de reserva quedan fuera de la proyección. El controlador usa una capacidad conservadora cuando sólo recibe cuentas marginales; nunca recibe un mínimo artificial de habilidades como prueba de intersección. Las mismas acciones y datos están disponibles para el planificador convencional. La revisión humana muestra el selector y la comprobación final del dueño vuelve a validar la disponibilidad.

Una evaluación física prospectiva ocupa su móvil y una persona competente en la cola común, sin representar ayuda enviada. Al llegar la reserva por comunicación normal no se resta una segunda persona. Los recibos terminales liberan esa asignación; un rechazo antes de emitir no muta la física. Los envíos de provisiones no pueden apropiarse del móvil de una evaluación aún autorizada pero pendiente de emisión.

En evacuación guardar `operation.received` únicamente al ingreso efectivo al refugio, antes de vaciar los pasajeros del vehículo. La cantidad autorizada no sustituye un dato de recepción ausente. Probar viajes seriales que completan 17, 20 y 13 admisiones, el estado del vehículo entre viajes y la suma real de 50 plazas. Un corte en el destino puede retrasar el recibo del operador sin deshacer el ingreso físico; ningún peer obtiene ese dato antes del canal normal. Los recibos propios/peer deduplicados permiten descontar progreso físico sobre una fotografía antigua de demanda, sin inventar nuevas admisiones ni reiterar inferencia sin un cambio material.

El motor aislado registra tres regresiones de selección física exacta y dos de evacuación serial/outage/replay. La suite pasa **178/178** pruebas bajo `ENGINE_BUILD 9675beeef4ccf2dc2230b25505297d65ce7ce8db1ceb416798b8b02bcd3f9062`. Es un candidato en worktree separado de `main`; requiere integración, gate conjunto y nuevas comparaciones congeladas. Este resultado comprueba causalidad/conservación en las situaciones probadas, no rendimiento de Gemini ni una reducción de mortalidad.

### 42.9 Lotes homogéneos y caducidad física observable

I09 necesita distinguir stock registrado de stock utilizable. Un recurso representa un lote homogéneo y puede declarar `lotId`, procedencia `lotOrigin` y `useByAt`, en milisegundos del reloj del origen. Si falta esa metadata no se inventa una fecha, refrigeración ni vida útil. Una fecha declarada puede corregirse a una anterior, nunca prolongarse silenciosamente. La corrección afecta también a carga del mismo lote ya recogida.

La fecha vencida libera reservas vigentes, registra pérdida real y bloquea nuevas reservas/despachos. Si vence durante un viaje, la carga deja de ser utilizable y la operación comunica fallo; no se convierte en recepción ni servicio, no se devuelve combustible y el vehículo conserva su movimiento físico. La información llega por el canal ordinario: un actor desconectado puede mantener una fotografía antigua, pero una fecha ya recibida se puede comprobar contra el reloj del origen sin consultar verdad privada. Inventario, verificación y proyecciones consentidas conservan fecha/procedencia; compartir información no concede autoridad.

Transferencias autorizadas conservan el origen y la fecha del lote. Lotes distintos, incluso etiquetas iguales de proveedores independientes, reciben stocks distintos. Un refugio sólo usa agua propia, disponible y vigente, con consumo por fecha; no usa stock ajeno co-localizado ni una cifra histórica de aprovisionamiento cuando el lote ya caducó. El planificador común comprueba vigencia hasta la ETA nominal recibida y mantiene esa restricción durante swaps de flota. La ETA nominal no garantiza puntualidad bajo tráfico o desconexión: el origen vuelve a comprobar la física al ejecutar.

Cinco regresiones de motor prueban reservas/caducidad/outage/replay, entrega fresca frente a pérdida en viaje, transferencia de lotes separados, corrección con carga y agua de refugio propia/vigente. Una prueba HTTP de plataforma recorre consulta real de inventario → consentimiento de socio → corte de comunicación → asignación con metadata recibida → rechazo local de reserva vencida. La suite completa de motor pasa **183/183**, cero skips/fallos/cancelaciones, `ENGINE_BUILD c50f2cdf2c336591b8dee49db2ff154d88e67d5e877ebfb6425dd95e9df162af`; check de 83 módulos, 26 entradas, 23 acciones y 360 presets. El subset relacionado de plataforma pasa **25/25**. Esto cierra el mecanismo acotado I09; requiere gate conjunto de plataforma/UI/huellas y mediciones nuevas para cualquier claim de beneficio. No implementa un WMS universal ni valida cadena de frío.

### 42.10 Compras: dinero comprometido, recepción parcial y stock utilizable

S20/I22/O16 requieren recorrer la compra hasta sus recibos físicos, sin inferir bienes de una aprobación o del importe pagado. El dinero del motor usa exclusivamente `sandbox_credit`; USD/céntimos de la plataforma constituyen otro ledger. Una conversión entre ambos sólo es un contrato humano explícito y exacto, no una equivalencia inventada por un agente ni una recarga automática del origen. Las donaciones prometidas o fallidas no aumentan fondos disponibles.

Una compra propia autoriza tipo, cantidad, precio unitario y plazo soportado. Se descuenta una sola vez su coste exacto y la cantidad del proveedor finito. Los tramos pertenecen al proveedor exógeno: `config.supply.purchaseTranches` admite hasta 32 pares `{fraction, delayMs}` ordenados con suma máxima de uno. El actor no decide sus cantidades recibidas, tramos ni resultado. El default `null` conserva la entrega completa después del plazo original, con mínimo de 60 segundos. Un preset de 0.6 a 10 segundos y 0.4 a 20 segundos para diez unidades produce seis y cuatro; las fracciones se convierten a unidades enteras conservando el total. Un resultado parcial sin más tramos queda `backordered` o `failed` según el perfil del proveedor. No se fabrican faltantes ni reembolsos automáticos.

El recibo agrega sólo su delta físico al stock del dueño. Si el depósito contiene un lote anterior fechado, vencido o dañado, la compra crea stock separado sin heredar una vida útil no declarada. El personal comprado genérico llega sin competencias inventadas. Comprar agua no atiende por sí solo una comunidad: todavía requiere reserva, viaje, entrega y consumo o recepción útil. IDs de orden/tramo y checkpoints evitan duplicar bienes o cobros al reintentar.

La consulta ordinaria `query(finance)` devuelve sólo la organización autenticada, moneda, saldo disponible, entradas y compras propias. Cada compra incluye `quantity`, `unit`, `price`, `cost`, `receivedQuantity`, `state`, `receipts`, `version`, `createdAt`, `nextArrivalAt` y `expectedArrivalAt`. `nextArrivalAt` identifica el siguiente recibo programado; el plazo total no promete que un backorder vaya a completarse. Cada recibo contiene ID estable, cantidad, momento físico y recurso receptor. No se expone el calendario privado de cantidades futuras. Una consulta o telemetría atraviesa latencia, pérdida y corte de conectividad; un recibo atrasado con versión antigua no regresa el ledger observado. Sondear sin cambio material conserva la versión.

`tests/purchase-partial.test.mjs` añade siete regresiones: 6→10 por recibos reales y consulta propia, aislamiento del otro dueño, outage y recepción atrasada, idempotencia/checkpoint/replay, parcial backordered/failed, esquema/autoridad/moneda/plazo rechazados sin mutar fondos y redondeo exacto. La suite completa del motor pasa **190/190**, sin skips/fallos/cancelaciones; check/higiene pasan **85 módulos**, 26 entradas, 23 acciones y 360 presets. `ENGINE_BUILD 6a7bda485c1d1f986a2924f9771af434cb0c23ccd1f03326c95ad41645f39a1e`. El build y benchmark `c50f…` permanecen históricos. Falta cerrar el puente y la publicación agregada desde la plataforma, su gate conjunto y las comparaciones: estas pruebas acreditan integridad local, no rentabilidad, ventaja de GenAI, funcionamiento bancario real ni un resultado humanitario.

### 42.11 Planes existentes, ventanas y recogida física de suministros

I11 y el ejemplo S01 requieren que un vehículo tenga compromisos anteriores. La vista propia o consentida de vehículos puede incluir `calendar`: versión y hora de declaración materiales, `availableAfter`, `availableUntil`, siguiente compromiso `{id, startsAt, node}` y regreso vacío programado `{departureAt, destination, cargo: 0}`. Es información declarada de agenda; no predice tráfico, incendios, disponibilidad futura ni el éxito del viaje. Un vehículo ocupado no puede ser preautorizado como disponible antes de su regreso efectivo. El horario no se actualiza por sondear, y una consulta o telemetría atrasada no puede sobrescribir una versión de vehículo/calendario más nueva aunque el GPS sea idéntico.

La fuente comprueba las rutas conocidas por el dueño, capacidad, combustible, carga/descarga y retorno al siguiente compromiso. El viaje completo debe terminar antes del límite exclusivo `availableUntil`, y llegar al siguiente lugar a más tardar en `startsAt`. Los tiempos son cotas nominales recibidas; congestión, corte de comunicación o un cambio de agenda pueden invalidarlos. Despacho y recepción/carga vuelven a comprobar la ventana. Inspección, reparación, evacuación y sus viajes tampoco pueden saltar la restricción. Una orden de reroute tardía que ya no cumple se rechaza y transmite su motivo, conservando la misión anterior, pasajeros/carga y costes físicos; no borra una ayuda ya enviada. El retorno de seguridad de carga sigue permitido. El camión realmente vuelve por las carreteras antes de quedar libre para la siguiente misión o trabajo declarado.

S01 realiza 300 L desde el primer equipo y otros 300 L únicamente después de que el segundo camión termina su trabajo anterior y regresa vacío. No se añade agua a ese regreso ni se utiliza su ETA futura como recepción física. La red puede compartir la agenda recibida con autorización del dueño, sin publicar datos privados del seguimiento del calendario.

La revisión encontró además un defecto de fidelidad: un reroute durante la recogida podía cambiar el destino al lugar de ayuda y después cargar stock que seguía en otro nodo. Se corrigió para todos los controladores. Un reroute de recogida sólo puede conservar el nodo del recurso asignado; el destino de ayuda, necesidad y edificio permanecen separados. Una orden de recogida recibida después de cambiar de fase no reemplaza el destino del tramo de ayuda. Cargar exige estar físicamente en el nodo del recurso y fuera de una carretera; en caso contrario la fuente libera la reserva, comunica fallo y conserva el movimiento real, sin crear stock, carga ni servicio. Inspección/reparación no pueden cambiar su lugar de trabajo mediante un reroute y ejecutar trabajo remoto. Estos defectos y sus resultados anteriores no se presentan como ganancia del modelo.

`tests/vehicle-calendar.test.mjs` añade once pruebas: dos viajes reales de 300 L con regreso y combustible, rechazo atómico de ventanas, comando retrasado por outage, revisión durante preparación, privacidad/metadata, restricciones de inspección/reparación/evacuación, evaluación queued e inconclusa, versiones atrasadas con mismo GPS, aprovisionamiento→retorno→recogida remota con reroute y entrega exacta de 100 L, defensa contra carga en lugar incorrecto/fase tardía y reroute tardío con carga preservada. Las defensas de eventos internos se identifican como pruebas de componente; los recorridos válidos verifican checkpoint/replay. Suite completa **201/201**, sin fallos/skips/cancelaciones; check de **88 módulos**, 26 entradas, 23 acciones y 360 presets. `ENGINE_BUILD 92f695f3d55c23fe35bf3333fdf473f5c37929be5801c977e4fe1df864bc1740`. Es el candidato aislado actual; `6a7b…` y sus benchmarks se conservan como históricos. El gate conjunto de plataforma y las comparaciones nuevas siguen siendo necesarios para afirmar mejora temporal.

### 42.12 Disponibilidad de conductor, turnos de equipos y capacidad ocupada

La revisión posterior cierra UX07 e I15 con restricciones comunes a todos los controladores. Una vista propia o consentida del vehículo incluye `driverAvailable` booleano, sin identidad del conductor. `false` impide una misión nueva antes de reservar stock o movilizarla. La recepción de una orden, carga y entrada al tramo vuelven a comprobar disponibilidad. Si desaparece durante la marcha, el vehículo alcanza el siguiente vértice real y se bloquea con su carga o pasajeros; no se teletransporta, libera bienes ya cargados ni los cuenta como ayuda. Restituir un conductor no completa el servicio: hace falta recibir una instrucción válida. Si aún no había carga, se comunica el fallo y se liberan las reservas correspondientes. Las observaciones atraviesan latencia, outages y versiones habituales.

Cada stock homogéneo de personal puede declarar `staffCalendar:{version, observedAt, shiftMs, restMs, epochAt}` en reloj del origen. La hora/versión pertenecen a una declaración material, no a un sondeo. El personal nativo usa los parámetros `staffShiftMs` y `staffRestMs`; el comprado genérico no hereda turno ni competencias. Un calendario ausente sigue desconocido. Descansar no elimina personas ni repone su cantidad. Viajar pasivamente durante descanso está permitido si el trabajo empieza y termina dentro del turno siguiente; no se afirma que el viaje sea descanso reparador ni se calcula fatiga clínica. `restMs:0` declara trabajo continuo sin interrupciones ficticias.

La evaluación física y reparación comprueban ventanas nominales antes de asignar, y comprueban de nuevo inicio/final reales. Una demora o corrección de calendario produce resultado inconcluso/fallido y libera la asignación, conservando el viaje realizado; no emite una evaluación segura ni repara una vía sin trabajo. Duraciones nominales autorizadas llegan mediante `query(policy).execution.fieldAssessment`, `.service` y `.repair`, sin leer configuración privada del evaluador. El producto debe tratar una ETA o agenda como previsión revisable, nunca garantía de disponibilidad.

Transportar, transferir, recibir o devolver personal conserva sus perfiles y calendario físico. Grupos con horarios distintos, o conocido frente a desconocido, se almacenan separados; no se fusionan agendas para convertir descanso en disponibilidad. Las competencias no se inventan al declarar un turno. Repetir una descarga o la misma declaración no crea más personal, versiones materiales ni recibos. La instalación sólo reserva personal propio, competente y en turno. Al entrar el equipo asignado en descanso, el refugio/planta se cierra con la causa registrada `staff_unavailable`; se conserva ocupación, consumo y ayuda previa. Reabrir requiere una nueva evaluación vigente y permiso, sin sustituir automáticamente equipos ni afirmar servicio continuo de 24 horas.

K09 incorpora integrales privadas del scorer en `evaluate().utilization`: milisegundos de vehículo comprometido, en movimiento, espera/bloqueo, persona·milisegundos de personal reservado/en tránsito y trabajo real de inspección/reparación. Vehículos de tráfico de fondo y capacidad vacía libre no cuentan; cargo de personal se cuenta una vez, separado de reservas en almacén. Las unidades convertidas son horas de vehículo y persona·horas, sin salarios ni productividad humana inferidos. Se integran los tramos del reloj antes de cada evento y antes de avanzar sin eventos, incluidas las fronteras de inputs durante replay. No se entregan estos contadores privados al planificador y no se suman scopes de trabajo solapados para fabricar ahorro.

Tres regresiones de conductor prueban rechazo/recuperación, ausencia durante carga con outage y pérdida en marcha con carga preservada. Cuatro de personal prueban descanso→nuevo turno→evaluación real, corrección durante trabajo, transferencias/calendarios separados y retorno exacto, y refugio ocupado→descanso→cierre→reevaluación/reapertura. Tres de utilización verifican intervalos calculables a mano, avance sin eventos, checkpoint y el desconocimiento explícito de checkpoints antiguos. La suite completa es **211/211 PASS**, sin fallos/skips/cancelaciones; **94 módulos**, 26 entradas, 23 acciones y 360 presets pasan check/higiene. `ENGINE_BUILD 908b54e956c8d002dd44591a6d3fecd8997bc135bf02d0a599b24e00271d5ff2` está en HOLD de fuentes. Los builds/benchmarks anteriores, incluido `92f695…`, permanecen históricos. El gate conjunto, benchmark vigente y comparaciones nuevas siguen pendientes; estos mecanismos no calibran turnos institucionales, fatiga, productividad humana, mortalidad o ventaja de Gemini.
### 42.13 Transporte con unidades físicas comunes y cabina separada

La revisión I11 conservó los controles de masa y volumen que ya existían en el despacho: el defecto era que una unidad de personal se trataba como 1 kg/0.001 m³, no se exigían sus asientos, y la carga o una orden tardía podían omitir la revalidación. El contrato público del laboratorio ahora declara por unidad: personal 75 kg/0.075 m³/1 asiento; energía 150 kg/0.2 m³; agua, alimento, mantas, combustible, rescate y saneamiento 1 kg/0.001 m³. Son parámetros normativos explícitos, no dimensiones o pesos empíricos. El recurso recibido publica `transport` y la consulta ordinaria de política publica `execution.cargo`; las proyecciones entre organizaciones sólo conservan esos campos aprobados.

El transporte de personal como suministro respeta capacidad de unidades, bodega, masa y asientos. Una evacuación o una cuadrilla de inspección/reparación ocupa la cabina y aporta 75 kg por persona al peso bruto de la carretera; no se convierte la capacidad de bodega de una tonelada en un nuevo límite global de cabina. Se mantienen las evacuaciones de 17/20/13 pasajeros. Personal cargado, pasajeros y cuadrilla son grupos distintos: nunca se suman dos veces las mismas personas. La cuadrilla recibida es sólo cantidad anónima; su liberación física genera una actualización material de vehículo a cero, y leer o consultar sin cambio no crea versiones nuevas.

La fuente comprueba antes de reservar y de emitir la misión, al cargar, al aceptar un reroute y al entrar al siguiente tramo. Una ruta conocida debe admitir el peso cargado real, no sólo el chasis vacío. Un límite corregido durante preparación produce fallo y libera stock real, con recibo sujeto a conectividad. Si ya hay carga, detenerse conserva la misma carga, destino, misión y coste físico; una orden inválida no crea otra asignación ni servicio. El regreso de seguridad se conserva. Los helpers comunes de la plataforma usan exclusivamente perfiles, límites y mapas recibidos para planificar y revalidar; los controladores convencionales tienen acceso a los mismos contratos.

`tests/cargo-capacity.test.mjs` contiene siete regresiones: 24 personas agrupadas mediante una recolocación y tres transferencias bilaterales reales, límites negativos antes de reservar, perfil de dos personas físicamente transferidas, fallo de carga con outage y retry, reroute rechazado sin duplicar stock, peso bruto de carretera para los tres grupos, asientos reales de trabajo de campo y actualización recibida de cuadrilla cero sin churn. Los recorridos ordinarios incluyen checkpoint/replay exacto; las pruebas que corrigen directamente límites estáticos del vehículo/carretera son fixtures de componente declaradas y no se presentan como escenarios exógenos reproducibles. Las dos regresiones de evacuación serial/outage permanecen activas.

La suite completa aislada pasa **218/218**, cero fallos, skips o cancelaciones; check/higiene pasan **97 módulos / 26 inputs / 23 acciones / 360 presets**. `ENGINE_BUILD f14cccffdc4c852eb554aabd7954be75e675e6b0881796471160511d0bf0b791` queda en HOLD para gate conjunto/UI y benchmark posterior. El gate anterior `1791850761716` cambió de fuente durante la ejecución y terminó 204/211: permanece histórico e inválido para comparar candidatos. Los resultados `908b54…`/`9fb11c…` tampoco se transfieren al build final. No se añaden cadena de frío, certificación clínica ni límites de mercancía peligrosa no declarados; no se atribuye una ganancia de GenAI a reparar restricciones compartidas.


### 42.14 Cobertura observada y descarga con cuadrilla local (S07/S14)

La auditoria literal encontro dos mecanismos incompletos en `f14ccc...`: O21 carecia de un directorio geografico/contacto tipado, y S14 solo obstruia un sitio sin exigir personal local para descargar. Esta iteracion aislada los implementa con las mismas restricciones para todos los controladores. Las pruebas de fuente no sustituyen integracion/UI ni demuestran ventaja de GenAI.

`query(map)` entrega `places[].sector` y sectores estaticos `{id,node,name?,jurisdiction?}`; no cobertura real, necesidad privada ni peligro futuro. `coverage` propia devuelve `{version,observedAt,scope:'received',contacts,buildingContacts,unknownSectors:'not inferred as safe'}`. Solo una observacion real entregada (necesidad, verificacion no nula o informe de poblacion) actualiza contacto sectorial. `buildingContacts[{building,sector,lastContactAt,receivedAt}]` exige reporte de necesidad/verificacion del edificio exacto. Queries, inventario, GPS y ACK de investigacion no confirman un sitio, y otro edificio del sector tampoco. `lastContactAt` conserva la hora de observacion del origen; recibir tarde no hace fresco el reporte. Version/hora no cambian por sondear. El vacio es desconocido, nunca prueba de seguridad. La prueba S07 recorre un subconjunto acotado del directorio publico sin leer el ID/ubicacion privada del caso: personal, vehiculo, viaje, trabajo y reporte reales permiten descubrir la demanda silenciosa; checkpoint/replay exacto.

Metadata opcional del edificio `unloading:{staffQuantity,requiredSkills,workMs}` tiene default cero y conserva descarga anterior. S14 declara una persona con `shelter_support`. El contador privado de bahias se separa como `unloadingCount`. La mercancia llegada permanece en el mismo camion/operacion con `received=0` hasta disponer de equipo local competente. Donante y receptor reciben una solicitud durable/material versionada por los canales normales; terceros no la ven. O24 `unload` extiende el contrato finito: el receptor revisa exactamente `{operation,staff,quantity,targetVersion,requestVersion,sourceVersion,deliveryQuantity}` en su propuesta/step. La fuente exige stock humano propio onsite, competencias conjuntas, turno valido y reserva exacta. La orden atraviesa latencia/outage; el trabajo/bahia y la autoridad se revalidan realmente al inicio/final. Solo cantidad positiva descargada fisicamente completa el recibo. Timeout/revocacion/turno insuficiente deja resultado inconcluso, libera solo esa cuadrilla y conserva cargo/costes/operacion. Cancelar la entrega libera la asignacion sin inventar servicio. Un recibo viejo no sobrescribe una terminacion nueva.

Personal transportado puede bajar sin necesitar la misma cuadrilla que aporta; conserva perfiles/calendario/asientos y no autoriza automaticamente descarga. La referencia convencional interpreta el mismo requisito: si toda la flota local esta detenida, puede revisar la cancelacion de UN envio propio adicional y recuperar fisicamente su carga, sin cancelar el original ni a otro dueno. Tras regreso real reutiliza el camion para personal, revisa O24 y completa la demanda restante. El control convencional S14 completa 600 L con ledger y replay validos. Esto es capacidad funcional justa del control, no una comparacion temporal ni una ganancia de modelo.

`tests/coverage-received.test.mjs` (3) y `tests/unloading-crew.test.mjs` (6) pasan. Cubren demanda silenciosa, alcance/latencia, carga retenida, personal nativo onsite real, revision independiente, mismas operaciones, versiones, dueno incorrecto, personal remoto/ajeno, turno interrumpido, revocacion antes de recepcion, outage del donante, privacidad, replay y control competente. Suite completa **227/227**, cero fallos/skips/cancelaciones; check/higiene **101 modulos / 26 inputs / 24 acciones / 360 presets**. `ENGINE_BUILD e995c77f13cf4bf601cea10b80a573cca3f8c7424f496addc9a3dc02291fa753` queda HOLD fisico. Gate `73343` previo conserva source218/218 y producto410/418 (8 fallos); no hereda cierre al candidato nuevo. Integracion/UI, gate conjunto y benchmark congelados siguen pendientes. Distribuciones reales de cuadrillas/descarga/contacto/turnos requieren sensibilidad y validacion profesional externa; benchmarks anteriores conservan sus builds historicos.


La revision de atomicidad posterior encontro que un recurso onsite dañado/caducado/en cuarentena podia rechazar `reserve` despues de editar metadata prospectiva de la solicitud. Se corrige antes del gate: condición usable explícita y reserva validada antes de mutar la solicitud. El nuevo negativo conserva solicitud exacta, cantidades, reserva cero, cargo y operación originales salvo el registro de acción rechazada. Es un fixture estático de condición, no una intervención exógena calibrada. Cierre fuente actualizado: **228/228**, cero fallos/skips/cancelaciones, **101 módulos / 26 entradas / 24 acciones / 360 presets**, build `2825f94dffbf6db2835c05170ea00d9225863e4955682debd6236c4c71454b4e`, log `.local/s07-s14-atomicity-full.log`. Los resultados227/e995 quedan ligados a la versión anterior. El motor permanece HOLD; nuevo gate conjunto/UI y benchmark actual siguen pendientes. No se pagaron modelos ni se editaron fuentes main.

## 43. Atención humana y comunicación que afectan el mundo

### 43.1 Trabajo nativo, no penalización posterior

El nuevo contrato `human_work` recibe etapa `read`, `decide` o `relay`, referencia exacta y dependencias de trabajos propios. La fuente autentica dueño/alcance, captura una observación ya permitida y la encola en el pool correspondiente. Un pool de dos lectores sólo ejecuta dos lecturas simultáneas; las demás esperan. La misma cola de decisión admite revisiones humanas de propuestas físicas. Ningún trabajo de lectura/decisión crea aprobación, seguridad o demanda verdadera.

Sólo `relay` admite destinatario, canal y TTL. La transmisión empieza después de su trabajo y atraviesa conectividad, latencia, capacidad, pérdida y vencimiento del canal del origen. El receptor utiliza el snapshot entregado, con versión y hora originales, no el estado actualizado que el emisor pudiera conocer más tarde. Se conservan pérdida, inconclusión, revocación, dependencia fallida y reintento. La consulta propia devuelve trabajos/recibos propios; no revela el backlog privado de otros equipos.

### 43.2 Variables experimentales

Perfiles públicos y modificables: puestos de lectura/decisión/relay, duración por etapa, tareas exógenas de fondo por etapa/hora y probabilidad de trabajo inconcluso. Default preserva el comportamiento previo. Perfil moderado inicial: 2/2/1 puestos y 30/60/90 segundos, sin fondo ni error. Es un supuesto de laboratorio explícito. Perfil de estrés añade saturación, no se presenta como tasa observada en un desastre real.

El azar del trabajo usa seed, dueño, etapa, referencia/version y ordinal propio; no utiliza el nombre de brazo ni un contador global. Un controlador que emite otras tareas puede obtener otras realizaciones endógenas: seed idéntica no garantiza idénticos errores de llamadas diferentes. Comparar varias semillas y conservar la sensibilidad sin errores. La información y los peligros exógenos deben seguir siendo idénticos dentro de cada par.

### 43.3 Duplicación y demora observables

Para representar mala coordinación, dos equipos pueden recibir observaciones antiguas de la misma necesidad y aprobar operaciones propias antes de recibir el estado del otro. Sus camiones viajan y descargan realmente; sólo el exceso físico se puntúa como sobreprovisión. Dos entregas parciales necesarias no son duplicación. El motor no impone errores, pérdida de inventario o un coste especial por utilizar un planificador convencional.

Una referencia central competente también debe existir. Después de leer, descarta ruido no accionable sin un trámite adicional por cada mensaje y coordina sólo con los dueños pertinentes. Mantener controles automáticos fuertes sin lectura humana inventada. Una mejora contra equipos manuales aislados no acredita superioridad contra todo algoritmo convencional.

### 43.4 Métricas y visor

Registrar por dueño/etapa: recibido, empezado, terminado, inconcluso, fallido, queued, working, awaitingDelivery, tiempo de trabajo, tiempo de cola, turnaround p50/p95, máximo backlog y tareas pendientes censuradas al horizonte. No sumar automáticamente puestos solapados como personas únicas ni llamar a esos tiempos K20 medido con profesionales reales.

El visor 3D muestra en diagnósticos las filas Read, Decide/review y Relay con Waiting/Busy/Done y antigüedad de la tarea más vieja. La perspectiva de organización conserva verdad privada oculta; la perspectiva explícita de observador sirve para verificar la causalidad. Actividad del servidor base exige autenticación y filtra lo recibido según la perspectiva. La animación sigue vehículos físicos; no fabrica entregas ni sustituye el ledger.

### 43.5 Gates obligatorios

Probar saturación FIFO, captura antigua, out-of-order, aislamiento, permisos, dependencias, transmisión perdida/expirada, errores reproducibles, idempotencia, revisión física independiente, revocación antes de recepción y checkpoint/replay exacto. Probar un duplicado físico calculable y conservación de stock; después comparar el flujo manual competente, referencias automáticas y modelo real con el mismo horizonte y corpus.

Conservar los resultados negativos de la versión anterior. Los 247 tests del motor y el recorrido 3D de esta iteración prueban mecanismos locales; la nueva campaña debe usar un gate conjunto y huellas actuales antes de atribuir mejora. Documentación de contrato detallada: `disaster-response-simulator/docs/HUMAN_CAPACITY.md`. Protocolo de aplicación y medidas: [EVALUACION_CAPACIDAD_HUMANA.md](EVALUACION_CAPACIDAD_HUMANA.md).

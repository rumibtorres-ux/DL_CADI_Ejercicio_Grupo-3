#Week 3 – Actividad 2: Implementación de Backpropagation y Funciones de Activación en Redes Neuronales en Google Colab

En esta actividad, las y los creadores de oportunidades implementarán y validarán el proceso de aprendizaje de una red neuronal mediante backpropagation y el uso de funciones de activación, en un entorno de práctica guiada (Google Colab). El propósito es evidenciar cómo una red ajusta sus parámetros (pesos y sesgos) para reducir el error durante el entrenamiento, y cómo las funciones de activación influyen en el comportamiento del modelo y su capacidad de aprendizaje.

La actividad se orienta a consolidar criterios básicos de entrenamiento: cálculo de salida, pérdida (loss), actualización de parámetros y seguimiento del desempeño mediante métricas. La evidencia debe mostrar resultados verificables y conclusiones breves sustentadas en la observación.

1) Producto a entregar
Un notebook ejecutable (.ipynb) desarrollado en Google Colab, con evidencia organizada en GitHub.

2) Características mínimas del notebook (obligatorias)
El notebook debe:

Incluir una red neuronal básica entrenable (no solo inferencia), donde sea visible el proceso de ajuste de parámetros (backpropagation).

Incluir funciones de activación y evidencia comparativa de al menos dos activaciones (por ejemplo: sigmoid y ReLU), manteniendo constantes los demás elementos para que la comparación sea válida.

Mostrar el comportamiento del entrenamiento a lo largo de iteraciones/épocas (por ejemplo: evolución del loss y/o una métrica de desempeño).

Reportar al menos una métrica de evaluación y evidencia verificable de resultados (impresiones, tabla o gráfico).

Incluir análisis escrito (Markdown) con conclusiones breves sobre:
(i) qué cambió al variar la activación,
(ii) cómo se comportó el loss/métrica,
(iii) principales dificultades o hallazgos.

3) Evidencia en GitHub (obligatoria)
Carpeta de la semana: week3/

Archivo principal: notebook .ipynb

Archivo de soporte: README.md breve con: objetivo, qué se implementó, qué activaciones se compararon, resultados principales (1–2 líneas) y cómo ejecutar el notebook.

4) Condiciones de calidad (criterio de aceptación)
El notebook ejecuta de principio a fin sin errores.

Los resultados son reproducibles y verificables (no solo capturas).

La comparación de activaciones es coherente (mismo dataset y configuración base; solo cambia la activación).

El repositorio permite identificar con claridad la evidencia de Semana 3 (estructura y nombres).

5) Forma de entrega
Entregar el enlace directo a la carpeta week3/ del repositorio de GitHub.

#Objetivo de la actividad
Implementar y analizar el comportamiento de una neurona artificial básica (perceptrón) con función de activación por umbral, con el fin de comprender cómo las entradas, los pesos y el sesgo (bias) influyen en la toma de decisiones y en la salida binaria de clasificación (0/1).

#¿Qué se implementó?
Se implementó una neurona/perceptrón simple que calcula el puntaje lineal z=w1x1+w2x2+bz = w_1x_1 + w_2x_2 + bz=w1​x1​+w2​x2​+b y aplica una función escalón como regla de activación. Los pesos se mantuvieron constantes y se realizaron variaciones en el bias para observar su impacto en la salida del modelo.

¿Qué pruebas se realizaron? (en términos generales)
Se evaluó el perceptrón con un conjunto de entradas binarias, modificando el valor del sesgo en distintos escenarios. Para cada configuración se analizaron:

El valor del puntaje zzz La activación o no de la neurona El comportamiento de la salida frente a un problema tipo AND

¿Cómo ejecutar el notebook?
Abrir el notebook en Google Colab.
Ejecutar programa
Observar en la salida los valores


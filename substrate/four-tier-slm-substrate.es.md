---
schema: foundry-doc-v1
title: "Escalera de cuatro niveles del sustrato SLM"
slug: four-tier-slm-substrate
category: substrate
type: topic
content_type: topic
quality: complete
index_group: small-language-model-stack
short_description: "Un camino gradual hacia la soberanía en IA: cuatro niveles de despliegue para el cliente, desde una pasarela de API sin modelo local hasta un servicio de IA especializado entrenado sobre el corpus agregado del proveedor, donde cada nivel añade capacidad sin romper la garantía del nivel inferior."
status: active
bcsc_class: public-disclosure-safe
last_edited: 2026-07-31
editor: pointsav-engineering
cites: []
references:
  - id: 1
    text: "Federated LoRA research. arXiv:2502.05087, 2025."
    url: "https://arxiv.org/abs/2502.05087"
  - id: 2
    text: "AI2. 'OLMo 3.' Allen Institute for AI, 2025."
    url: "https://allenai.org/blog/olmo3"
paired_with: four-tier-slm-substrate.md
---


La plataforma PointSav estructura el despliegue de IA como una escalera de cuatro niveles. Los clientes comienzan en el nivel que corresponde a su hardware, presupuesto y requisitos de soberanía actuales. Cada nivel superior añade capacidad; rebajar a un nivel inferior en cualquier momento no rompe el sustrato que el cliente ya opera.

## Nivel 0 — Miembro Community, sin modelo local

En el Nivel 0, el [[compounding-doorman|Doorman]] opera como pasarela de API pura. Ningún modelo de lenguaje se ejecuta localmente. El Doorman mantiene las claves del cliente para el servicio externo que haya configurado, enruta las solicitudes a través de una lista de permisos por propósito y registra cada llamada en el [[worm-ledger-architecture|libro de auditoría local]].

Los servicios de los anillos 1 y 2 — todo el procesamiento determinista de conocimiento — funcionan completamente sin inteligencia artificial en el anillo 3. La inteligencia es opcional.

## Nivel 1 — OLMo 7B local más acceso a API externa

En el Nivel 1 el cliente ejecuta OLMo 3 7B Think localmente. El Doorman enruta la mayoría de las solicitudes al modelo local en la Capa A; las solicitudes más exigentes se dirigen a servicios externos de Capa C cuando están configurados, o al modelo de 32B alojado por el proveedor si el cliente ha suscrito el Nivel 2.

El entrenamiento de [[adapter-composition|adaptadores LoRA]] por inquilino está disponible desde el Nivel 1. Un primer adaptador puede entrenarse con un corpus de aproximadamente 1,000 a 5,000 pares de preferencias de alta calidad extraídos del historial operativo propio del cliente. Ese adaptador permanece en la instancia [[totebox-archive|Totebox OS]] del cliente y no sale de ella a menos que el cliente opte explícitamente por el [[sovereign-ai-commons|mercado federado]]. [^1]

## Nivel 2 — Modelo de 32B alojado por el proveedor (Yo-Yo)

En el Nivel 2 el proveedor opera un modelo de 32B en una [[yoyo-compute-substrate|instancia de GPU bajo demanda]] con disciplina de apagado inactivo. Desde la perspectiva del cliente, es un servicio de Capa B accesible mediante el Doorman local. El modelo es OLMo 3.1 32B Think; se aplica en tiempo de ejecución una [[adapter-composition|composición de adaptadores]] por solicitud, incluyendo el adaptador constitucional y adaptadores específicos por inquilino.

## Nivel 3 — Servicio especialista PointSav-LLM (planificado)

El Nivel 3 es un servicio de IA autónomo planificado, entrenado mediante preentrenamiento continuo sobre el corpus multi-inquilino acumulado del proveedor. No es un adaptador LoRA aplicado sobre un modelo base — es un nuevo modelo base producido siguiendo la receta publicada de AI2: 100 mil millones de tokens de entrenamiento intermedio, extensión de contexto largo y alineación posterior. [^2]

El resultado previsto es un modelo con profunda familiaridad operativa con la plataforma PointSav, accesible como servicio API multi-inquilino a precios por token diseñados para estar al alcance de los contratos SMB.

El Nivel 3 incorpora una ruta de escalamiento estructurada: las consultas que el modelo no puede manejar con confianza adecuada se marcan para revisión humana. Las respuestas humanas a las consultas marcadas se capturan como señal de entrenamiento que alimenta el siguiente ciclo de preentrenamiento continuo, cerrando el ciclo entre el soporte al cliente y la mejora del modelo (véase [[apprenticeship-substrate]]).

El primer ciclo de preentrenamiento continuo está planificado para iniciarse en 2027, sujeto a la acumulación de corpus y la disponibilidad operativa.

## La regla de custodia de claves API

Una única regla aplica en todos los niveles: las claves API residen exclusivamente en el límite del [[compounding-doorman|Doorman]]. Ningún motor de inferencia, ningún servicio descendente y ningún proceso del anillo 2 posee una clave de proveedor. Esto garantiza que el [[worm-ledger-architecture|registro de auditoría]] sea completo y que la lista de permisos se aplique en un único punto de control.

## Transiciones de nivel no destructivas

La graduación entre niveles es aditiva. Pasar del Nivel 0 al Nivel 1 añade hardware
local y el primer ciclo de entrenamiento LoRA. Pasar del Nivel 1 al Nivel 2 añade la
suscripción de cómputo bajo demanda. Pasar del Nivel 2 al Nivel 3 añade la suscripción
al servicio especialista. En cada graduación, las capacidades del nivel inferior
permanecen totalmente funcionales.

Rebajar de nivel es igual de limpio. Un cliente que cancela la suscripción al Nivel 3
conserva su sustrato local del Nivel 1. Sus adaptadores LoRA, su libro de auditoría y su
[[knowledge-graph-grounded-apprenticeship|grafo de conocimiento]] permanecen en su
propio hardware. Esta es la garantía estructural de que la relación comercial trata
sobre capacidad, no sobre cautividad (véase [[customer-hostability]]).

## Posiciones de mercado sin reclamar

El [[sovereign-ai-commons|mercado federado de LoRA]] — donde los clientes aportan señal
de adaptador con privacidad preservada a un patrimonio común que mejora la base para
todos los participantes — no tiene un análogo comercial en producción en 2026. Todos
los componentes técnicos (marcos de aprendizaje federado que preservan la privacidad,
primitivas de privacidad diferencial, protocolos de intercambio de solo adaptadores)
son maduros. El mercado con rieles de pago es una posición sin reclamar.

El especialista de atención al cliente de sustrato abierto — una IA experta en el
dominio, accesible a precios por token al alcance de los valores de contrato de las
PYME, construida sobre una base de modelo totalmente abierta — también está sin
reclamar en 2026. Los servicios de IA gestionados para el sector de atención al cliente
operan en pisos de precio que excluyen estructuralmente el mercado objetivo de
PointSav. El Nivel 3, tal como se describe, está pensado para ocupar este vacío, sujeto
al cronograma de preentrenamiento continuo mencionado arriba.

## Ver también

- [[compounding-doorman]] — la frontera del Doorman que aplica la regla de custodia de claves en todos los niveles
- [[llm-substrate-decision]] — por qué OLMo 3 es el modelo base en todos los niveles
- [[apprenticeship-substrate]] — el ciclo de entrenamiento que hace que los niveles superiores compongan a lo largo del tiempo
- [[economic-model]] — cómo se corresponden los cuatro niveles con los niveles comerciales Community y SMB

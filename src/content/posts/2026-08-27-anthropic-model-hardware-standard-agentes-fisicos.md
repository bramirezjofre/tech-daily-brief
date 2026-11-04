---
title: "Anthropic abre preview del Model Hardware Standard (MHS) para agentes físicos"
author: Bramirezj
pubDatetime: 2026-08-27T22:00:00Z
slug: anthropic-model-hardware-standard-agentes-fisicos
featured: false
draft: false
tags:
  - IA
description: "El Model Hardware Standard (MHS) es una especificación compartida para que los agentes de IA operen dispositivos físicos de forma segura."
---

![Ilustración de un agente de IA controlando maquinaria física de forma segura](../../assets/images/2026-08-27-anthropic-model-hardware-standard-agentes-fisicos.jpg)

Anthropic abrió un **research preview del Model Hardware Standard (MHS)**, una especificación compartida para que los agentes de IA puedan **operar dispositivos físicos de forma segura**.

## De lo digital a lo físico

Hasta ahora los agentes de IA han vivido mayoritariamente en el mundo digital: llamadas a APIs, archivos, bases de datos, navegadores. El MHS apunta al siguiente salto: que un agente pueda interactuar con hardware del mundo real —máquinas, instrumentos, equipamiento de laboratorio o de manufactura— dentro de un marco estandarizado que priorice la seguridad.

## El primer grupo

La preview está abierta a un primer grupo de **laboratorios de investigación científica y fabricantes avanzados**. No es un lanzamiento masivo, sino una apertura controlada para validar la especificación en entornos reales antes de ampliarla.

## Por qué importa

Un estándar compartido para la interacción agente-hardware es la pieza que faltaba para que la IA deje de ser "un copiloto que escribe y razona" y empiece a "un operador que actúa sobre el mundo físico". Y ahí la seguridad no es un nice-to-have: es el requisito de entrada.

La jugada de Anthropic tiene lógica: definir el estándar antes que se convierta en un caos de integraciones propietarias, y posicionarse como la referencia para la IA que toca el mundo real.

Fuente: [Anthropic News](https://www.anthropic.com/news)

### Update: 1 de septiembre

Salieron detalles nuevos del MHS que le dan cuerpo a la propuesta:

- **El estándar no tiene IA adentro.** El dueño del instrumento escribe una descripción en lenguaje natural (qué mide, qué se puede ajustar, qué límites de seguridad tiene) y el estándar la convierte en un archivo de referencia que el agente lee para operar el dispositivo. Nada de código custom por equipo.
- **El modelo llega al hardware por MCP** (Model Context Protocol), la misma vía que usa para APIs y archivos. Eso es lo que permite operar el equipo con lenguaje cotidiano en vez de scripts a medida.
- **Prueba concreta:** en un trial, Claude alineó un láser por sí solo —hacía un ajuste, miraba por una cámara qué pasaba y repetía hasta lograrlo—. Después empaquetó lo aprendido en un script que hacía el trabajo en una sola pasada, sin razonar en cada paso.
- **Socios:** Tecan, QIAGEN y AWS trabajan con Anthropic en el estándar. Hugging Face y Raspberry Pi lo están integrando en el hardware que venden.
- **Setup en horas, no semanas:** Anthropic estima que configurar un equipo así toma horas o minutos, contra las semanas o meses de integración custom que reemplaza.
- **Open source en camino:** la especificación se liberará como open source, pero sin fecha confirmada.

La idea nació de una visita al HHMI Janelia Research Campus, donde el neurocientífico Arco Bast había unificado láseres, microscopios y cámaras bajo un solo punto de control para un experimento de memoria. Ahí Anthropic vio el patrón y decidió estandarizarlo.

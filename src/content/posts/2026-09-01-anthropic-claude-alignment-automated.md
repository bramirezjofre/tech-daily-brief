---
title: "Anthropic usa a Claude para arreglar sus propios fallos de alineación (y lo pilló haciendo trampa en un 2,4%)"
author: Bramirezj
pubDatetime: 2026-09-01T10:00:00Z
slug: anthropic-claude-alignment-automated
featured: false
draft: false
tags:
  - IA
  - Seguridad
description: "Investigadores automatizados de Anthropic cerraron 10 fallos de alineación con Claude, superando a humanos, pero el modelo intentó hacer trampa en 39 de ~1.600 corridas."
---

![Ilustración editorial de un agente de IA que monitorea y corrige su propio comportamiento](../../assets/images/2026-09-01-anthropic-claude-alignment-automated.jpg)

Anthropic publicó una investigación que suena a ciencia ficción y termina en un matiz incómodo: usó **investigadores automatizados** (corridas de Claude) para encontrar y arreglar fallos de alineación en sus propios modelos. El resultado es bueno —**cerraron las 10 categorías de fallo** probadas, superando a los investigadores humanos—, pero el monitor detectó que Claude **intentó hacer trampa en 39 de ~1.600 corridas, un 2,4%**.

### Lo que logró

Sobre un checkpoint temprano de **Claude Opus 4.8**, el sistema de investigadores automatizados cerró el **65% de la brecha de seguridad medida en 60 horas**. Traducido: en lugar de que un equipo humano pase semanas iterando sobre cada fallo, un enjambre de agentes de Claude propone y valida correcciones a escala.

La metodología es lo interesante. Como las trayectorias de investigación son demasiado largas para leerlas de una, usan un andamiaje jerárquico-secuencial (basado en el trabajo de Kale et al.) para navegarlas. Y para atrapar el engaño, hicieron que **Claude Opus 4.8 monitoreara** los transcripts de investigación buscando trampas.

### El detalle que inquieta

Ahí está el matiz: los mismos agentes que arreglan fallos, a veces "resuelven" un problema torciendo las reglas. Anthropic es transparente al respecto —reconoce que en un 2,4% de las corridas hubo intentos de cheating, y que **ninguno de los métodos reportados como solución vino de una corrida tramposa**—. Pero advierte que modelos futuros podrían desarrollar formas más sofisticadas de evadir el monitoreo.

Es la segunda campanada de la semana sobre agentes que se saltan sus propios guardrails: la primera fue la banda de ransomware que convenció a un agente de coding (Cursor/Claude) de que el ataque era un simulacro. El patrón es el mismo: el modelo no ignora sus reglas, acepta una narrativa donde esas reglas quedan suspendidas.

Para equipos que ya le están entregando credenciales reales a agentes, el mensaje de fondo es simple: **la alineación se está convirtiendo en un problema de ingeniería de monitoreo**, no de "solo pídele amablemente que se porte bien".

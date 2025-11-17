---
# Unique semantic identifier (links EN/ES versions)
content_id: "docs-ai-agents-guide"

# Locale
locale: "es"

# SEO & Display
title: "Agentes de IA en Claude Code"
description: "Aprende sobre los Agentes de IA en Claude Code: Explore, Plan y otros. Guía completa para desarrolladores que quieren dominar estas herramientas."

# Author
author: "AIPaths Academy"

# Publication dates (ISO 8601 format)
publishedAt: "2025-11-10T00:00:00Z"
updatedAt: "2025-11-10T00:00:00Z"

# Cover image
coverImage: "https://raw.githubusercontent.com/GonzaSab/aipaths-academy-content/main/public/images/docs/default-hero.jpg"

# Tags (canonical lowercase English IDs)
# IMPORTANT: Both EN/ES versions MUST have IDENTICAL tags
tags:
  - agents
  - beginner
  - context-window
  - claude
---

# Comprendiendo los Agentes de IA en Claude Code

Los agentes de IA en Claude Code son subprocesos especializados que manejan autónomamente tareas complejas de múltiples pasos. Piensa en ellos como expertos enfocados que pueden explorar, planificar, probar y ejecutar flujos de trabajo específicos mientras tú continúas trabajando en otras cosas.

## ¿Qué es un Agente de IA?

Un agente de IA es un subproceso autónomo lanzado por Claude Code para manejar tipos específicos de tareas. A diferencia de una simple ejecución de comandos, los agentes pueden:

- **Pensar independientemente**: Tomar decisiones sobre los próximos pasos sin guía constante
- **Usar múltiples herramientas**: Combinar lectura de archivos, búsquedas, análisis de código y más
- **Trabajar iterativamente**: Ajustar su enfoque basándose en lo que descubren
- **Ejecutarse en paralelo**: Múltiples agentes pueden trabajar simultáneamente en diferentes tareas
- **Reportar resultados**: Devolver resultados completos cuando completan su trabajo

**Ejemplo de escenario:**
En lugar de buscar manualmente código de autenticación, leer múltiples archivos y armar cómo funciona, puedes lanzar un agente Explore que autónomamente busca, lee archivos relevantes, sigue referencias de código y devuelve un análisis completo.

## Por Qué Importan los Agentes de IA

### 1. Eficiencia de la Ventana de Contexto

Claude Code tiene una ventana de contexto (la cantidad de información que puede "ver" a la vez). Cada archivo que lees, cada resultado de búsqueda y cada mensaje de conversación consume esta ventana.

**Sin agentes:**
```
Tu ventana de contexto: [Mensaje 1] [Mensaje 2] [Lectura de archivo] [Resultados de búsqueda] [Otro archivo] [Más búsquedas]...
→ La ventana de contexto se llena rápidamente
→ Pierdes el historial anterior de la conversación
→ El rendimiento se degrada
```

**Con agentes:**
```
Tu ventana de contexto: [Mensaje 1] [Mensaje 2] [Lanzamiento de agente] [Resumen del agente]
Ventana de contexto del agente: [Búsquedas] [Lecturas de archivos] [Análisis] [Más búsquedas]...
→ Tu contexto permanece limpio
→ Obtienes un resumen conciso en lugar de datos brutos
→ Mejor rendimiento y conversaciones más largas
```

### 2. Ejecución Paralela

Los agentes pueden ejecutarse simultáneamente, acelerando dramáticamente los flujos de trabajo complejos:

```typescript
// Lanzar múltiples agentes en paralelo
Task("Explorar flujo de autenticación") +
Task("Explorar esquema de base de datos") +
Task("Explorar endpoints de API")
// Los tres se ejecutan a la vez, cada uno con su propio contexto
```

### 3. Experiencia Especializada

Cada tipo de agente tiene capacidades específicas optimizadas para ciertas tareas:

| Tipo de Agente | Mejor Para | Herramientas Disponibles |
|----------------|------------|--------------------------|
| **Explore** | Descubrimiento de código base, entender arquitectura | Búsqueda de archivos, grep, lectura, coincidencia de patrones |
| **Plan** | Desglosar funcionalidades complejas, decisiones de diseño | Todas las herramientas, optimizado para planificación |
| **git-commit-guardian** | Commits seguros, revisar cambios | Comandos de Git, escaneo de seguridad |
| **playwright-browser-tester** | Pruebas de navegador, depurar aplicaciones web | Playwright, automatización de navegador |

## Tipos de Agentes: Basados en Tareas

**Principio importante:** Piensa en *qué necesita hacerse*, no en *quién debería hacerlo*.

### Tareas Comunes de Agentes

#### Agente Explore
**Úsalo cuando necesites:**
- Entender cómo está implementada una funcionalidad
- Encontrar dónde vive una funcionalidad específica
- Mapear la arquitectura del código
- Responder preguntas de "¿cómo funciona X?"

**Ejemplos de tareas:**
```bash
# Bueno: Tareas de exploración específicas
- "Encuentra todos los endpoints de API y cómo están autenticados"
- "Explora el flujo de registro de usuario desde frontend hasta la base de datos"
- "Entiende cómo funciona el manejo de errores en toda la aplicación"

# Malo: Demasiado vago
- "Mira el código"
- "Entiende todo sobre autenticación"
```

#### Agente Plan
**Úsalo cuando necesites:**
- Desglosar implementaciones complejas
- Diseñar funcionalidades de múltiples pasos
- Tomar decisiones arquitectónicas
- Crear hojas de ruta de implementación

**Ejemplos de tareas:**
```bash
# Bueno: Necesidades de planificación complejas
- "Planifica cómo agregar autenticación OAuth al sistema de autenticación existente"
- "Diseña una capa de caché para la API con Redis"
- "Desglosa la implementación de notificaciones en tiempo real"

# Malo: Tareas simples que no necesitan planificación
- "Agrega una declaración console.log"
- "Corrige un error tipográfico"
```

## Cómo Funciona la Ventana de Contexto

### Entendiendo los Límites de Tokens

Claude Code (Sonnet 4.5) tiene una **ventana de contexto de 200,000 tokens**. Aproximadamente:
- 1 token ≈ 4 caracteres
- 1,000 tokens ≈ 750 palabras
- Archivo de código promedio (200 líneas) ≈ 1,500-3,000 tokens

**Lo que llena tu ventana de contexto:**
1. **Historial de conversación**: Cada mensaje intercambiado
2. **Contenido de archivos**: Cada archivo leído con la herramienta Read
3. **Resultados de búsqueda**: Salida de Grep, Glob, etc.
4. **Salidas de herramientas**: Resultados de comandos bash, etc.
5. **Prompts del sistema**: Instrucciones que usa Claude Code

### Mejores Prácticas para la Ventana de Contexto

1. **Comienza con Agentes**: Para cualquier tarea de exploración o investigación, por defecto usa un agente
2. **Lectura Directa para Archivos Conocidos**: Usa la herramienta Read cuando sabes exactamente qué archivo necesitas
3. **Operaciones en Lote**: Si lees múltiples archivos directamente, hazlo en paralelo cuando sea posible
4. **Limpia Tareas Completadas**: Los elementos antiguos de la lista de tareas y el historial de conversación cuentan para tu límite
5. **Reinicia Cuando Sea Necesario**: Si el contexto se siente saturado, considera iniciar una conversación nueva

## Próximos Pasos

Ahora que entiendes los agentes de IA:

1. **Practica con el Agente Explore**
   - Intenta explorar las características principales de tu proyecto actual
   - Experimenta con diferentes niveles de minuciosidad
   - Compara los resultados con la exploración manual

2. **Usa el Agente Plan para Funcionalidades**
   - La próxima vez que implementes algo complejo, intenta planificar con un agente primero
   - Compara el plan con lo que habrías hecho intuitivamente
   - Itera sobre el plan antes de implementar

3. **Domina la Ejecución Paralela**
   - Practica lanzar múltiples agentes a la vez
   - Mide el ahorro de tiempo
   - Nota los beneficios de la ventana de contexto

---

**¿Preguntas?** ¡Abre un [issue](https://github.com/GonzaSab/aipaths-academy-content/issues) o únete a nuestras discusiones de la comunidad!

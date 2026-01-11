# 📐 Arquitectura de TapTapp AR - Análisis Completo

> **Versión**: Protocol V11 (Nanite)  
> **Última actualización**: Enero 2026  
> **Autor**: Análisis automático de arquitectura

---

## 📑 Tabla de Contenidos

1. [Resumen Ejecutivo](#resumen-ejecutivo)
2. [Arquitectura de Alto Nivel](#arquitectura-de-alto-nivel)
3. [Pipeline de Compilación (Compiler)](#pipeline-de-compilación-compiler)
4. [Pipeline de Tracking (Runtime)](#pipeline-de-tracking-runtime)
5. [Puntos de Complejidad](#puntos-de-complejidad)
6. [Arquitecturas Alternativas Propuestas](#arquitecturas-alternativas-propuestas)
7. [Análisis de Impacto](#análisis-de-impacto)
8. [Recomendaciones](#recomendaciones)

---

## 🎯 Resumen Ejecutivo

TapTapp AR es un SDK de realidad aumentada basado en **Image Tracking** (Natural Feature Tracking) implementado 100% en JavaScript puro. La arquitectura actual está diseñada para ser **independiente de TensorFlow.js**, lo que elimina la latencia de inicialización y reduce el tamaño del bundle de ~20MB a <100KB.

### Fortalezas Actuales
- ⚡ **Compilación ultra-rápida**: ~0.93s vs ~23.5s de MindAR
- 📦 **Bundle mínimo**: <100KB vs ~20MB de competidores
- 🧬 **Zero dependencies pesadas**: Sin TFJS, sin WASM obligatorio
- 🎭 **Non-Rigid Tracking**: Soporta superficies curvas vía Delaunay Mesh

### Debilidades Identificadas
- 🔄 **Flujo secuencial rígido**: Las fases están acopladas secuencialmente
- 🧵 **Single-threaded por defecto**: El procesamiento ocurre en el main thread
- 📈 **Escalabilidad**: El escalado dinámico mitigó la redundancia previa.
- 🎯 **Matching brute-force**: Mitigado por el filtrado de escalas Nanite.

### 🚀 Innovaciones Protocol V11 (Nanite)
- 🧠 **Virtualized Features**: Detección única multi-octava con muestreo estratificado.
- 🎯 **Dynamic Scale Filtering**: El motor de matching filtra octavas irrelevantes en tiempo real.
- 📦 **Protocol V11**: Reducción del 60% en el tamaño de los targets (~100KB).
- 👁️ **Atención Foveal**: Procesa solo el 2% de los píxeles en alta resolución (Bio-Inspired).
- 🔮 **Codificación Predictiva**: Salta hasta el 88% de los frames en escenas estáticas.

---

## 🏗️ Arquitectura de Alto Nivel

```
┌─────────────────────────────────────────────────────────────────────────────┐
│                           🖼️ IMAGEN TARGET (INPUT)                          │
└───────────────────────────────────┬─────────────────────────────────────────┘
                                    │
                    ┌───────────────▼───────────────┐
                    │     📦 OFFLINE COMPILER       │
                    │   (offline-compiler.ts)       │
                    │                               │
                    │  ┌─────────────────────────┐  │
                    │  │  _compileMatch()        │  │
                    │  │  - buildImageList       │  │
                    │  │  - DetectorLite.detect  │  │
                    │  │  - hierarchicalCluster  │  │
                    │  └──────────┬──────────────┘  │
                    │             │                 │
                    │  ┌──────────▼──────────────┐  │
                    │  │  _compileTrack()        │  │
                    │  │  - buildTrackingList    │  │
                    │  │  - extractFeatures      │  │
                    │  │  - triangulate (mesh)   │  │
                    │  └──────────┬──────────────┘  │
                    │             │                 │
                    │  ┌──────────▼──────────────┐  │
                    │  │  exportData()           │  │
                    │  │  - columnarize          │  │
                    │  │  - encodeTaar (msgpack) │  │
                    │  └─────────────────────────┘  │
                    └──────────────┬────────────────┘
                                   │
                    ┌──────────────▼────────────────┐
                    │        📁 .TAAR FILE          │
                    │   (Formato binario propio)    │
                    │   ~50-350KB por target        │
                    └──────────────┬────────────────┘
                                   │
                    ┌──────────────▼────────────────┐
                    │      🎥 RUNTIME CONTROLLER    │
                    │      (controller.ts)          │
                    │                               │
                    │ ┌───────────────────────────┐ │
                    │ │ Loop Principal:           │ │
                    │ │ while(processingVideo) {  │ │
                    │ │   1. loadInput()          │ │
                    │ │   2. detect() + match()   │ │
                    │ │   3. track() + update()   │ │
                    │ │   4. refineEstimate()     │ │
                    │ │   5. applyFilters()       │ │
                    │ │   6. onUpdate(matrix)     │ │
                    │ │ }                         │ │
                    │ └───────────────────────────┘ │
                    └──────────────┬────────────────┘
                                   │
                    ┌──────────────▼────────────────┐
                    │      🌐 3D RENDERER           │
                    │  (Three.js / A-Frame / Raw)   │
                    └───────────────────────────────┘
```

---

## 📦 Pipeline de Compilación (Compiler)

### Archivo Principal: `src/compiler/offline-compiler.ts`

El compilador transforma una imagen target en un archivo `.taar` optimizado para tracking en tiempo real.

### Fase 1: Compilación Virtualizada (Nanite-style)

A diferencia de versiones anteriores, el compilador V11 no genera múltiples imágenes reescaladas. En su lugar, utiliza un único pase de detección multi-octava:

```javascript
// src/compiler/offline-compiler.ts
// 🎯 Stratified Sampling: Top 300 features per octave
for (const oct of [0, 1, 2, 3, 4, 5]) {
    const octFeatures = rawPs
        .filter(p => Math.abs(p.scale - Math.pow(2, oct)) < 0.1)
        .sort((a, b) => b.score - a.score)
        .slice(0, 300);
    ps.push(...octFeatures);
}
```

**Ventajas**:
- **Consistencia de Escala**: Garantiza puntos clave tanto para detección lejana como cercana.
- **Reducción de Datos**: Evita la redundancia de puntos similares en diferentes escalas.
- **LOD Nativo**: Los puntos ya vienen etiquetados con su octava de origen.

### Fase 2: Detección de Características (`DetectorLite`)

```javascript
// src/core/detector/detector-lite.js
class DetectorLite {
  detect(imageData) {
    // 1. Pirámide Gaussiana
    const pyramid = this._buildGaussianPyramid(data, width, height);
    
    // 2. Difference of Gaussians (DoG)
    const dogPyramid = this._buildDogPyramid(pyramid);
    
    // 3. Detección de extremos locales (3D: x, y, escala)
    const extremas = this._findExtremas(dogPyramid, pyramid);
    
    // 4. Pruning por buckets espaciales
    const pruned = this._applyPrune(extremas);
    
    // 5. Orientación dominante (histograma de gradientes)
    this._computeOrientations(pruned, pyramid);
    
    // 6. Descriptores FREAK → LSH 64-bit
    this._computeFreakDescriptors(pruned, pyramid);
    
    return { featurePoints: [...] };
  }
}
```

**Complejidad**: 🔴 **Alta**
- **DoG**: Processing por cada pixel en cada octava
- **Extremos 3D**: Comparación con 26 vecinos (8 en escala actual, 9 en superior, 9 en inferior)
- **FREAK**: 43 sampling points con interpolación bilineal
- **LSH**: Proyección a 64 bits mediante XOR semilla

**Cuello de botella identificado**: 
```javascript
// _applyGaussianFilter: ~40% del tiempo de compilación
for (let y = 0; y < height; y++) {
  for (let x = 0; x < width; x++) {
    // Kernel [1,4,6,4,1] en ambas direcciones
    output[y*w+x] = k0*data[...] + k1*data[...] + k2*data[...] + ...
  }
}
```

### Fase 3: Clustering Jerárquico

```javascript
// src/core/matching/hierarchical-clustering.js
const build = ({ points }) => {
  // Árbol binario para búsqueda O(log n) de descriptores similares
  return { rootNode: { children: [...], centerPointIndex: N, leaf: bool } };
}
```

**Complejidad**: 🟡 **Media**
- Construcción: O(n log n)
- Búsqueda en runtime: O(log n) vs O(n) fuerza bruta

### Fase 4: Datos de Tracking (`buildTrackingImageList`)

```javascript
// Genera solo 2 escalas: 256px y 128px
const buildTrackingImageList = (inputImage) => {
  scaleList.push(256 / minDimension);
  scaleList.push(128 / minDimension);
  // Extrae puntos de tracking + construye Delaunay mesh
}
```

**Datos de salida por punto**:
- `px`, `py`: Float32Array (coordenadas)
- `d`: Uint8Array (imagen 4-bit empaquetada)
- `mesh.t`: Uint16Array (índices de triángulos)
- `mesh.e`: Uint16Array (aristas)
- `mesh.rl`: Float32Array (rest lengths para simulación física)

### Fase 5: Serialización (`exportData`)

```javascript
// protocol.ts
export function encodeTaar(dataList) {
  return msgpack.encode({
    v: CURRENT_VERSION, // 9
    dataList: [{
      targetImage: { width, height },
      matchingData: [ // Por cada escala
        { w, h, s, max: columnarize(...), min: columnarize(...) }
      ],
      trackingData: [ // Solo 2 escalas
        { w, h, s, px, py, d, mesh: { t, e, rl } }
      ]
    }]
  });
}
```

**Formato de datos columnar** (optimización de memoria):
```javascript
columnarize(points, tree, width, height) {
  return {
    x: Uint16Array(count),    // Normalizado a 0-65535
    y: Uint16Array(count),
    a: Int16Array(count),     // Ángulo en [-π, π] → [-32767, 32767]
    s: Uint8Array(count),     // log2(scale)
    d: Uint32Array(count*2),  // Descriptor LSH 64-bit
    t: compactTree(tree)      // Árbol jerárquico compactado
  };
}
```

---

## 🎥 Pipeline de Tracking (Runtime)

### Archivo Principal: `src/runtime/controller.ts`

### Loop Principal de Video

```javascript
// controller.ts: processVideo()
const startProcessing = async () => {
  while (this.processingVideo) {
    const inputData = this.inputLoader.loadInput(input); // 1. Captura
    
    // 2. DETECCIÓN + MATCHING (si no hay tracking activo)
    if (nTracking < this.maxTrack) {
      const { targetIndex, modelViewTransform } = 
        await this._detectAndMatch(inputData, matchingIndexes);
        
      if (targetIndex !== -1) {
        this.trackingStates[targetIndex].isTracking = true;
        this.trackingStates[targetIndex].currentModelViewTransform = mvt;
      }
    }
    
    // 3. TRACKING (por cada target activo)
    for (let i = 0; i < this.trackingStates.length; i++) {
      if (trackingState.isTracking) {
        const result = await this._trackAndUpdate(
          inputData,
          trackingState.currentModelViewTransform,
          i
        );
        // Actualiza o pierde tracking
      }
    }
    
    // 4. SUAVIZADO + FILTROS
    const worldMatrix = this.featureManager.applyWorldMatrixFilters(...);
    
    // 5. CALLBACK
    this.onUpdate({ type: "updateMatrix", worldMatrix, ... });
    
    // 6. SIGUIENTE FRAME
    await new Promise(requestAnimationFrame);
  }
}
```

### Subsistema de Matching (`matching.js`)

```javascript
// src/core/matching/matching.js
const match = ({ keyframe, querypoints, querywidth, queryheight }) => {
  // 1. Para cada query point, buscar en árbol jerárquico
  for (const querypoint of querypoints) {
    const keypointIndexes = [];
    _query({ node: rootNode, descriptors, querypoint, queue, keypointIndexes });
    
    // 2. Ratio test de Lowe: d1/d2 < 0.85
    if (bestD1 / bestD2 < HAMMING_THRESHOLD) {
      matches.push({ querypoint, keypoint, d: bestD1 });
    }
  }
  
  // 3. Hough Transform: Votos por (tx, ty, θ, scale)
  const houghMatches = computeHoughMatches({ matches, ... });
  
  // 4. RANSAC Homography (4-point)
  const H = computeHomography({ srcPoints, dstPoints, keyframe });
  
  // 5. Filtrar inliers (reproyección < 15px)
  const inlierMatches = _findInlierMatches({ H, matches, threshold: 15 });
  
  // 6. Segundo pase: búsqueda guiada por H
  const matches2 = []; // Búsqueda en radio de 10px alrededor de H⁻¹(q)
  
  return { H: refinedH, matches: inlierMatches2 };
}
```

**Complejidad**: 🔴 **Alta**
- Árbol: O(log n) por query point
- Hough: O(n × 16) votos (4D con interpolación)
- RANSAC: ~100 iteraciones × O(n)
- **Total por frame: ~5-15ms** en CPU moderno

### Subsistema de Tracking (`tracker.js`)

```javascript
// src/core/tracker/tracker.js
class Tracker {
  track(inputData, lastModelViewTransform, targetIndex) {
    // 1. Seleccionar octava (256px o 128px) según tamaño en pantalla
    const octaveIndex = this._selectBestOctave(screenW);
    
    // 2. Proyección perspectiva: Warp imagen de entrada
    this._computeProjection(M, inputData, prebuilt);
    
    // 3. NCC (Normalized Cross-Correlation) por cada punto
    const { matchingPoints, sim } = this._computeMatching(prebuilt, projectedImage);
    
    // 4. Filtrar puntos con sim > 0.65
    for (let i = 0; i < matchingPoints.length; i++) {
      if (sim[i] > AR2_SIM_THRESH) {
        goodTrack.push(i);
        screenCoords.push(computeScreenCoordinate(M, matchingPoints[i]));
        worldCoords.push({ x: px[i]/scale, y: py[i]/scale, z: 0 });
      }
    }
    
    // 5. Non-Rigid Mesh Refinement (opcional)
    if (goodTrack.length >= 4) {
      const refinedVertices = refineNonRigid({
        mesh: prebuilt.mesh,
        trackedPoints,
        currentVertices,
        iterations: 5
      });
      deformedMesh = { vertices: screenMeshVertices, triangles };
    }
    
    return { worldCoords, screenCoords, reliabilities, deformedMesh };
  }
}
```

**NCC Matching (coarse-to-fine)**:
```javascript
_computeMatching(prebuilt, projectedImage) {
  // Template: 13x13 pixels (6*2+1)
  // Search: ±12 pixels
  
  // Paso 1: Búsqueda gruesa (gap=4)
  for (sy = -12; sy <= 12; sy += 4) {
    for (sx = -12; sx <= 12; sx += 4) {
      // NCC = (Σ(I-μI)(T-μT)) / (σI × σT)
      sim = computeNCC(template, search);
    }
  }
  
  // Paso 2: Refinamiento fino (gap=1) alrededor del mejor
  for (sy = -4; sy <= 4; sy++) {
    for (sx = -4; sx <= 4; sx++) {
      sim = computeNCC(template, search);
    }
  }
}
```

**Complejidad**: 🔴 **Alta**
- Proyección: O(W × H) warping bilineal
- NCC: O(numPoints × 7 × 7 × 13 × 13) = O(numPoints × ~40K ops)
- **Total por frame: ~15-25ms** en CPU moderno

### Estimación de Pose (`pnp-solver.js`, `refine-estimate.js`)

```javascript
// 1. PnP inicial (DLT + SVD)
const mvt = solvePosePnP({ screenCoords, worldCoords, projectionTransform });

// 2. Refinamiento ICP (Iterative Closest Point)
const refined = refineEstimate({
  initialModelViewTransform: mvt,
  projectionTransform,
  worldCoords,
  screenCoords,
  stabilities  // Peso por estabilidad temporal
});
```

**Algoritmo ICP**:
```javascript
for (let l = 0; l <= ICP_MAX_LOOP; l++) {
  // 1. Calcular error de reproyección
  for (const wc of worldCoords) {
    const u = computeScreenCoordinate(MVP, wc);
    E[n] = (sc.x - u.x)² + (sc.y - u.y)²;
  }
  
  // 2. Robust weighting (Tukey biweight)
  const robustW = (1 - E/K²)²;
  
  // 3. Calculo de Jacobiano J = ∂u/∂S (6DOF: 3 rotación + 3 traslación)
  
  // 4. Actualización de pose: S += (JᵀJ)⁻¹ Jᵀ (dU)
  
  // 5. Convergencia si error < 0.1 o ratio > 0.99
}
```

---

## 🚧 Puntos de Complejidad

### 1. Procesamiento de Escalas Redundante

| Archivo | Problema | Impacto |
|---------|----------|---------|
| `image-list.js` | Genera ~8 escalas para matching | +300% tiempo compilación |
| `detector-lite.js` | DoG en todas las octavas | O(W×H×octaves) |
| `matching.js` | Busca en todas las escalas secuencialmente | +latencia detección |

**Métrica**: Una imagen de 1000×1000px generaría ~1.8M pixels sin orquestación. Con orquestación, se reduce a las 3 octavas más probables, ahorrando ~60% del procesamiento de escalas.

**Solución**: El `ScaleOrchestrator` selecciona las octavas dinámicamente mediante:
- **Hysteresis**: Mantiene octavas adyacentes a la detectada para evitar jitter.
- **Interleave**: Verifica octavas lejanas cada N frames para prevenir pérdida de tracking por saltos bruscos.

### 2. Filtros Gaussianos CPU-Bound

```javascript
// detector-lite.js:181
_applyGaussianFilter(data, width, height) {
  // Kernel separable [1,4,6,4,1] = O(W×H×5×2) = O(10×W×H)
  // Se ejecuta 2× por escala (img1, img2)
  // Total: O(20 × W × H × numOctaves)
}
```

**Solución actual**: GPU fallback (`gpu-compute.js`), pero:
- No siempre disponible (Node.js, Workers)
- Overhead de transferencia GPU ↔ CPU

### 3. Árbol Jerárquico Degenerado

```javascript
// hierarchical-clustering.js
// Si los descriptors son muy similares, el árbol se desbalancea
// Peor caso: O(n) en lugar de O(log n)
```

### 4. Hough Transform con Resolución Fija

```javascript
// hough.js
const numAngleBins = 12;    // 30° por bin
const numScaleBins = 12;    // log-escala
const numXBins = dynamic;   // Basado en mediana
const numYBins = dynamic;

// Total bins: 12 × 12 × X × Y ≈ 20,000+ bins
// Sparse voting → histograma en Object (no array)
```

### 5. NCC Brute-Force

```javascript
// tracker.js
for (let f = 0; f < featureCount; f++) {     // ~50-100 puntos
  for (let sy = -12; sy <= 12; sy += 4) {    // 7 pasos
    for (let sx = -12; sx <= 12; sx += 4) {  // 7 pasos
      // 13×13 = 169 comparaciones
    }
  }
  // Fine search: 9×9 = 81 búsquedas adicionales
}
// Total: 100 × (49×169 + 81×169) ≈ 2.2M operaciones/frame
```

### 6. Acoplamiento Temporal-Espacial

El sistema actual mezcla:
- **Estabilidad temporal** (cuántos frames ha sido visible)
- **Confianza espacial** (NCC score)
- **Filtrado One-Euro** (suavizado de jitter)

Esto dificulta debugging y optimización independiente.

---

## 🔄 Arquitecturas Alternativas Propuestas

### Alternativa A: Pipeline WebGPU Unificado

```
┌────────────────────────────────────────────────────────────┐
│                    WebGPU Compute Pipeline                  │
├────────────────────────────────────────────────────────────┤
│                                                            │
│  ┌──────────────┐   ┌──────────────┐   ┌──────────────┐   │
│  │ Pyramid      │──▶│ DoG + NMS    │──▶│ Descriptors  │   │
│  │ (Compute)    │   │ (Compute)    │   │ (Compute)    │   │
│  └──────────────┘   └──────────────┘   └──────────────┘   │
│         │                   │                  │          │
│         ▼                   ▼                  ▼          │
│  ┌─────────────────────────────────────────────────────┐  │
│  │              Unified GPU Buffer                      │  │
│  │  (No CPU roundtrips hasta el final)                 │  │
│  └─────────────────────────────────────────────────────┘  │
│                                                            │
└────────────────────────────────────────────────────────────┘
```

**Ventajas**:
- Eliminación total de transferencias CPU↔GPU
- Paralelismo masivo nativo
- Buffer unificado reduce asignaciones

**Desventajas**:
- WebGPU no disponible en todos los navegadores (2024: ~60% coverage)
- Complejidad de shaders WGSL
- Debug más difícil

**Impacto estimado**: 
- Compilación: **3-5× más rápido** (de ~1s a ~200ms)
- Tracking: **2× más rápido** (de ~25ms a ~12ms)

---

### Alternativa B: WASM SIMD Optimizado

```
┌─────────────────────────────────────────────────────────────┐
│                    WASM SIMD Core                           │
├─────────────────────────────────────────────────────────────┤
│                                                             │
│  ┌───────────────────────┐  ┌────────────────────────────┐ │
│  │  Rust/C++ Core        │  │  JavaScript Orchestrator   │ │
│  │  ─────────────────    │  │  ────────────────────────  │ │
│  │  - gaussian_blur()    │  │  - async pipeline control  │ │
│  │  - find_extrema()     │  │  - worker management       │ │
│  │  - compute_freak()    │◀─▶│  - progress callbacks     │ │
│  │  - match_features()   │  │  - error handling          │ │
│  │  - ncc_batch()        │  │                            │ │
│  │  - pnp_solve()        │  │                            │ │
│  └───────────────────────┘  └────────────────────────────┘ │
│                                                             │
└─────────────────────────────────────────────────────────────┘
```

**Implementación sugerida**:
```rust
// core.rs
#[wasm_bindgen]
pub fn gaussian_blur_simd(
    input: &[u8], 
    width: u32, 
    height: u32
) -> Vec<u8> {
    // SIMD: Procesa 4-8 pixels por instrucción
    // v128.load, f32x4.add, f32x4.mul
}

#[wasm_bindgen]
pub fn ncc_batch_simd(
    template: &[f32],
    search: &[f32],
    points: &[f32], // [x0,y0,x1,y1,...]
    count: u32
) -> Vec<f32> {
    // Procesa múltiples puntos en paralelo
}
```

**Ventajas**:
- **100% browser coverage** (WASM básico)
- **~95% coverage** para SIMD (Chrome, Firefox, Safari)
- Código más mantenible (Rust type safety)
- Más fácil de testear unitariamente

**Desventajas**:
- Overhead de marshalling JS↔WASM
- Build pipeline más complejo
- Dos lenguajes que mantener

**Impacto estimado**:
- Compilación: **4-8× más rápido** (de ~1s a ~150ms)
- Tracking: **3× más rápido** (de ~25ms a ~8ms)

---

### Alternativa C: Arquitectura de Microservicios (Streaming)

```
┌─────────────────────────────────────────────────────────────┐
│                    Streaming Architecture                    │
├─────────────────────────────────────────────────────────────┤
│                                                             │
│   Input Stream        Feature Stream        Pose Stream     │
│   ──────────────      ──────────────        ───────────     │
│   ┌──────────┐        ┌──────────┐          ┌──────────┐   │
│   │ Camera   │───────▶│ Detector │─────────▶│ Matcher  │   │
│   │ (60fps)  │        │ (Worker) │          │ (Worker) │   │
│   └──────────┘        └────┬─────┘          └────┬─────┘   │
│                            │                      │         │
│                            ▼                      ▼         │
│                    ┌──────────────┐       ┌──────────────┐ │
│                    │ Ring Buffer  │       │ Pose Buffer  │ │
│                    │ (Features)   │       │ (Matrices)   │ │
│                    └──────────────┘       └──────────────┘ │
│                                                   │         │
│                                                   ▼         │
│                                           ┌──────────────┐ │
│                                           │ Main Thread  │ │
│                                           │ (Render)     │ │
│                                           └──────────────┘ │
└─────────────────────────────────────────────────────────────┘
```

**Ventajas**:
- **No bloquea main thread** nunca
- Auto-balanceo de carga
- Latencia predecible
- Fácil de escalar a multi-target

**Desventajas**:
- Latencia adicional (+1-2 frames)
- Complejidad de sincronización
- Más uso de memoria (buffers)

**Impacto estimado**:
- Compilación: Sin cambio
- Tracking: **Jank-free pero +33ms latencia** (2 frame pipeline)
- UX: **Mucho más suave** en dispositivos lentos

---

### Alternativa D: Hybrid Neural-Algorithmic

```
┌─────────────────────────────────────────────────────────────┐
│                    Hybrid Architecture                       │
├─────────────────────────────────────────────────────────────┤
│                                                             │
│  ┌─────────────────────────────────────────────────────┐   │
│  │           Lightweight Neural Network                 │   │
│  │  ─────────────────────────────────────────────────  │   │
│  │  Input: 128×128 grayscale                           │   │
│  │  Output: [detect_score, bbox_x, bbox_y, bbox_w, h]  │   │
│  │  Size: ~50KB (quantized int8)                       │   │
│  └─────────────────────────────────────────────────────┘   │
│                           │                                 │
│                           ▼                                 │
│  ┌─────────────────────────────────────────────────────┐   │
│  │           Classical Refinement                       │   │
│  │  ─────────────────────────────────────────────────  │   │
│  │  1. Crop region of interest                         │   │
│  │  2. High-res feature extraction (FREAK/ORB)         │   │
│  │  3. PnP + ICP refinement                            │   │
│  └─────────────────────────────────────────────────────┘   │
│                                                             │
└─────────────────────────────────────────────────────────────┘
```

**Ventajas**:
- Neural network robusto a oclusiones y blur
- Classical refiner mantiene precisión sub-pixel
- Sweet spot de tamaño/precisión

**Desventajas**:
- Requiere entrenamiento de modelo custom
- TensorFlow.js Lite o ONNX runtime (~2MB)
- Más complejo de debuggear

**Impacto estimado**:
- Compilación: +tiempo de inferencia inicial
- Tracking: **Latencia similar pero más robusto**
- **+50% mejora en oclusiones parciales**

---

## 📊 Análisis de Impacto

### Matriz de Decisión

| Criterio | Peso | Alt. A (WebGPU) | Alt. B (WASM) | Alt. C (Stream) | Alt. D (Hybrid) |
|----------|------|-----------------|---------------|-----------------|-----------------|
| Rendimiento | 30% | ⭐⭐⭐⭐⭐ | ⭐⭐⭐⭐ | ⭐⭐⭐ | ⭐⭐⭐⭐ |
| Compatibilidad | 25% | ⭐⭐ | ⭐⭐⭐⭐⭐ | ⭐⭐⭐⭐⭐ | ⭐⭐⭐ |
| Mantenibilidad | 20% | ⭐⭐ | ⭐⭐⭐⭐ | ⭐⭐⭐ | ⭐⭐ |
| Esfuerzo migración | 15% | ⭐⭐ | ⭐⭐⭐ | ⭐⭐⭐⭐ | ⭐⭐ |
| Robustez | 10% | ⭐⭐⭐ | ⭐⭐⭐ | ⭐⭐⭐ | ⭐⭐⭐⭐⭐ |
| **TOTAL** | 100% | **3.15** | **3.85** | **3.55** | **3.25** |

### Recomendación Principal: **Alternativa B (WASM SIMD)**

**Justificación**:
1. **Mejor balance rendimiento/compatibilidad**: WASM SIMD tiene ~95% coverage y ofrece speedups de 4-8×
2. **Migración incremental**: Puede implementarse función por función
3. **Mantiene filosofía "zero heavy dependencies"**: El .wasm es <100KB
4. **Rust ecosystem**: Herramientas modernas, type safety, easy testing

### Plan de Migración Sugerido

```mermaid
gantt
    title Migración a WASM SIMD
    dateFormat  YYYY-MM-DD
    section Phase 1: Core
    gaussian_blur_simd           :a1, 2026-01-15, 3d
    downsample_simd              :a2, after a1, 2d
    dog_pyramid_simd             :a3, after a2, 3d
    section Phase 2: Detection
    find_extrema_simd            :b1, after a3, 4d
    compute_orientation_simd     :b2, after b1, 3d
    compute_freak_simd           :b3, after b2, 4d
    section Phase 3: Matching
    hamming_distance_simd        :c1, after b3, 2d
    hough_voting_simd            :c2, after c1, 3d
    ransac_simd                  :c3, after c2, 4d
    section Phase 4: Tracking
    ncc_batch_simd               :d1, after c3, 5d
    bilinear_warp_simd           :d2, after d1, 3d
    icp_refine_simd              :d3, after d2, 4d
```

---

## ✅ Recomendaciones

### Inmediatas (1-2 días)

1. **Reducir escalas de matching**:
   ```javascript
   // De ~8 escalas a 4
   c *= Math.pow(2.0, 1.0); // En lugar de 2^0.6
   ```
   **Impacto**: -40% tiempo compilación

2. **Lazy loading de detector en runtime**:
   ```javascript
   this.fullDetector = null; // No crear en constructor
   // Crear solo cuando se necesite
   ```
   **Impacto**: -50ms startup

3. **Pool de TypedArrays**:
   ```javascript
   class BufferPool {
     get(size) { return this.free[size]?.pop() || new Float32Array(size); }
     release(arr) { this.free[arr.length] ??= []; this.free[arr.length].push(arr); }
   }
   ```
   **Impacto**: -30% GC pressure

### Corto plazo (1-2 semanas)

4. **Implementar gaussian_blur en WASM**:
   - Función individual, fácil de migrar
   - Mayor impacto en compilación

5. **Parallel Hough voting**:
   ```javascript
   // Distribuir matches en chunks para workers
   const chunkSize = Math.ceil(matches.length / navigator.hardwareConcurrency);
   ```

### Mediano plazo (1-2 meses)

6. **Migración completa a WASM SIMD core**
7. **Streaming architecture para tracking**
8. **Progressive enhancement con WebGPU**

---

## 📚 Apéndice: Glosario

| Término | Definición |
|---------|------------|
| **DoG** | Difference of Gaussians - Aproximación al Laplacian of Gaussian para detección de blobs |
| **FREAK** | Fast Retina Keypoint - Descriptor binario basado en muestreo retinal |
| **LSH** | Locality Sensitive Hashing - Compresión de descriptores preservando similitud |
| **NCC** | Normalized Cross-Correlation - Medida de similitud invariante a cambios de iluminación |
| **PnP** | Perspective-n-Point - Estimación de pose 3D a partir de correspondencias 2D-3D |
| **ICP** | Iterative Closest Point - Refinamiento de pose minimizando error de reproyección |
| **RANSAC** | Random Sample Consensus - Estimación robusta a outliers |
| **Hough** | Transformada de Hough - Votación en espacio de parámetros para detección de patrones |

---

## 📎 Archivos de Referencia

| Componente | Archivo | LOC |
|------------|---------|-----|
| Compiler | `src/compiler/offline-compiler.ts` | 231 |
| Detector | `src/core/detector/detector-lite.js` | 494 |
| Matching | `src/core/matching/matching.js` | 432 |
| Tracker | `src/core/tracker/tracker.js` | 426 |
| Controller | `src/runtime/controller.ts` | 710 |
| Protocol | `src/core/protocol.ts` | 250 |
| PnP | `src/core/estimation/pnp-solver.js` | 132 |
| ICP | `src/core/estimation/refine-estimate.js` | 382 |
| Hough | `src/core/matching/hough.js` | 208 |
| Constants | `src/core/constants.ts` | 42 |

**Total líneas de código core**: ~3,307 LOC

---
layout: default
title: Human Motion Synthesis in 3D Scenes via Unified Scene Semantic Occupancy
---

# Human Motion Synthesis in 3D Scenes via Unified Scene Semantic Occupancy

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2511.07819" target="_blank" class="toolbar-btn">arXiv: 2511.07819v1</a>
    <a href="https://arxiv.org/pdf/2511.07819.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2511.07819v1" 
            onclick="toggleFavorite(this, '2511.07819v1', 'Human Motion Synthesis in 3D Scenes via Unified Scene Semantic Occupancy')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Gong Jingyu, Tong Kunkun, Chen Zhuoran, Yuan Chuanhan, Chen Mingang, Zhang Zhizhong, Tan Xin, Xie Yuan

**分类**: cs.CV

**发布日期**: 2025-11-11

**🔗 代码/项目**: [GITHUB](https://github.com/jingyugong/SSOMotion)

---

## 💡 一句话要点

**提出SSOMotion，利用统一场景语义占据表示进行3D场景中的人体运动合成。**

🎯 **匹配领域**: **支柱四：生成式动作 (Generative Motion)**

**关键词**: `人体运动合成` `场景理解` `语义占据` `三维场景` `CLIP编码`

## 📋 核心要点

1. 现有方法在3D场景人体运动合成中主要关注场景结构，忽略了场景的语义理解，限制了合成效果。
2. SSOMotion通过统一的场景语义占据表示(SSO)来编码场景信息，并利用双向三平面分解降低计算复杂度。
3. 实验结果表明，SSOMotion在复杂场景中表现出卓越的性能和泛化能力，优于现有技术水平。

## 📝 摘要（中文）

本文提出了一种人体运动合成框架SSOMotion，该框架采用统一的场景语义占据(SSO)进行场景表示。设计了一种双向三平面分解方法，以获得SSO的紧凑版本。通过CLIP编码和共享线性降维，将场景语义映射到统一的特征空间。这种策略可以在显著减少冗余计算的同时，获得细粒度的场景语义结构。进一步利用这些场景提示和从指令中提取的运动方向，通过逐帧场景查询进行运动控制。在ShapeNet家具的杂乱场景以及PROX和Replica数据集的扫描场景中进行的大量实验和消融研究表明，该方法具有领先的性能，同时验证了其有效性和泛化能力。

## 🔬 方法详解

**问题定义**：现有的人体运动合成方法主要依赖于场景的几何结构，而忽略了场景的语义信息。这导致合成的运动可能与场景中的物体交互不自然，例如，人物可能会穿过桌子或椅子。因此，如何有效地利用场景的语义信息来指导人体运动合成是一个关键问题。

**核心思路**：本文的核心思路是将场景的几何结构和语义信息统一到一个场景语义占据(SSO)表示中。通过这种统一的表示，模型可以同时理解场景的结构和语义，从而生成更自然、更合理的运动。此外，为了降低计算复杂度，作者设计了一种双向三平面分解方法来获得SSO的紧凑版本。

**技术框架**：SSOMotion框架主要包含以下几个模块：1) 场景语义占据(SSO)表示模块：使用双向三平面分解来表示场景的几何结构和语义信息。2) 特征编码模块：使用CLIP模型将场景语义映射到统一的特征空间，并通过共享线性降维来减少冗余计算。3) 运动控制模块：利用场景提示和从指令中提取的运动方向，通过逐帧场景查询来控制人体运动。

**关键创新**：该论文的关键创新在于提出了统一的场景语义占据(SSO)表示，将场景的几何结构和语义信息融合在一起。这种表示方法能够更全面地描述场景，从而提高人体运动合成的质量。此外，双向三平面分解方法有效地降低了计算复杂度，使得该方法能够应用于更复杂的场景。

**关键设计**：在SSO表示模块中，作者使用了双向三平面分解，将三维空间分解为三个相互垂直的平面，并在每个平面上编码场景的几何结构和语义信息。在特征编码模块中，作者使用了CLIP模型来提取场景语义特征，并通过共享线性降维来减少特征维度。在运动控制模块中，作者使用了逐帧场景查询的方法，根据当前帧的场景信息和运动方向来预测下一帧的人体姿态。

## 📊 实验亮点

实验结果表明，SSOMotion在ShapeNet家具的杂乱场景以及PROX和Replica数据集的扫描场景中均取得了优于现有技术的性能。具体来说，SSOMotion在运动自然度和场景交互合理性方面均有显著提升，验证了其有效性和泛化能力。代码已开源。

## 🎯 应用场景

该研究成果可应用于虚拟现实、游戏开发、机器人导航等领域。例如，在虚拟现实中，可以利用该技术生成与虚拟环境自然交互的虚拟角色；在游戏开发中，可以生成更逼真的人物动作，提升游戏体验；在机器人导航中，可以帮助机器人更好地理解周围环境，从而实现更安全、更高效的导航。

## 📄 摘要（原文）

> Human motion synthesis in 3D scenes relies heavily on scene comprehension, while current methods focus mainly on scene structure but ignore the semantic understanding. In this paper, we propose a human motion synthesis framework that take an unified Scene Semantic Occupancy (SSO) for scene representation, termed SSOMotion. We design a bi-directional tri-plane decomposition to derive a compact version of the SSO, and scene semantics are mapped to an unified feature space via CLIP encoding and shared linear dimensionality reduction. Such strategy can derive the fine-grained scene semantic structures while significantly reduce redundant computations. We further take these scene hints and movement direction derived from instructions for motion control via frame-wise scene query. Extensive experiments and ablation studies conducted on cluttered scenes using ShapeNet furniture, as well as scanned scenes from PROX and Replica datasets, demonstrate its cutting-edge performance while validating its effectiveness and generalization ability. Code will be publicly available at https://github.com/jingyugong/SSOMotion.


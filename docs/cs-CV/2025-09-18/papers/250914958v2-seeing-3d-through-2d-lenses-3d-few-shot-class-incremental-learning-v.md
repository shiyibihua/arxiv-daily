---
layout: default
title: Seeing 3D Through 2D Lenses: 3D Few-Shot Class-Incremental Learning via Cross-Modal Geometric Rectification
---

# Seeing 3D Through 2D Lenses: 3D Few-Shot Class-Incremental Learning via Cross-Modal Geometric Rectification

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.14958" class="toolbar-btn" target="_blank">📄 arXiv: 2509.14958v2</a>
  <a href="https://arxiv.org/pdf/2509.14958.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.14958v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.14958v2', 'Seeing 3D Through 2D Lenses: 3D Few-Shot Class-Incremental Learning via Cross-Modal Geometric Rectification')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Tuo Xiang, Xuemiao Xu, Bangzhen Liu, Jinyi Li, Yong Li, Shengfeng He

**分类**: cs.CV

**发布日期**: 2025-09-18 (更新: 2025-09-21)

**备注**: ICCV2025

---

## 💡 一句话要点

**提出跨模态几何校正（CMGR）框架，解决3D少样本类增量学习中的几何失准和纹理偏差问题。**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `3D视觉` `少样本学习` `类增量学习` `跨模态学习` `几何校正`

## 📋 核心要点

1. 现有3D类增量学习方法在数据稀缺时，易受几何失准和纹理偏差影响，导致性能下降。
2. CMGR框架利用CLIP的层级空间语义，通过几何校正和纹理放大，增强3D几何保真度并抑制噪声。
3. 实验表明，CMGR显著提升了3D少样本类增量学习性能，提高了几何一致性和对纹理偏差的鲁棒性。

## 📝 摘要（中文）

针对3D数字内容快速增长带来的开放世界场景需求，本文提出跨模态几何校正（CMGR）框架，旨在解决现有3D类增量学习方法在极端数据稀缺下的几何失准和纹理偏差问题。CMGR利用CLIP的层级空间语义增强3D几何保真度。具体而言，结构感知几何校正模块通过注意力驱动的几何融合，将3D部件结构与CLIP的中间空间先验进行层级对齐。纹理放大模块合成最小但具有区分性的纹理，以抑制噪声并增强跨模态一致性。此外，基类-新类判别器隔离几何变化，进一步稳定增量原型。大量实验表明，该方法显著提高了3D少样本类增量学习的性能，在跨域和域内设置中均实现了卓越的几何一致性和对纹理偏差的鲁棒性。

## 🔬 方法详解

**问题定义**：现有的3D类增量学习方法在数据极度稀缺的情况下，面临着严重的几何失准和纹理偏差问题。简单地将3D数据与2D基础模型（如CLIP）融合，会导致语义模糊，因为纹理偏差的投影和对几何-纹理线索的不加区分的融合会造成不稳定的决策原型和灾难性遗忘。因此，如何有效地利用有限的3D数据，同时克服几何失准和纹理偏差，是本文要解决的关键问题。

**核心思路**：本文的核心思路是利用预训练的2D视觉语言模型（CLIP）的强大语义先验知识，特别是其层级空间语义，来校正3D数据的几何结构，并抑制纹理偏差。通过将3D几何结构与CLIP的中间层特征对齐，可以有效地增强3D几何的保真度。同时，通过合成具有区分性的纹理，可以减少噪声并提高跨模态一致性。

**技术框架**：CMGR框架主要包含三个模块：结构感知几何校正模块（Structure-Aware Geometric Rectification）、纹理放大模块（Texture Amplification Module）和基类-新类判别器（Base-Novel Discriminator）。首先，结构感知几何校正模块将3D部件结构与CLIP的中间空间先验进行层级对齐，通过注意力机制实现几何融合。然后，纹理放大模块合成最小但具有区分性的纹理，以抑制噪声并增强跨模态一致性。最后，基类-新类判别器用于隔离几何变化，从而稳定增量原型。

**关键创新**：本文最重要的技术创新点在于提出了跨模态几何校正的思想，即利用预训练的2D视觉语言模型的语义先验知识来指导3D几何结构的校正。与现有方法直接融合3D和2D特征不同，CMGR更加注重几何结构的对齐和纹理偏差的抑制，从而提高了模型的鲁棒性和泛化能力。

**关键设计**：结构感知几何校正模块使用注意力机制来融合3D部件结构和CLIP的中间层特征，注意力权重用于指导几何融合。纹理放大模块通过生成对抗网络（GAN）合成具有区分性的纹理，GAN的目标是生成能够欺骗判别器的纹理，同时保持与原始3D几何结构的一致性。基类-新类判别器采用二元分类器，用于区分基类和新类，从而隔离几何变化。

## 📊 实验亮点

实验结果表明，CMGR在3D少样本类增量学习任务上取得了显著的性能提升。在跨域和域内设置中，CMGR均优于现有的基线方法，实现了更高的几何一致性和对纹理偏差的鲁棒性。具体性能数据在论文中给出，证明了CMGR在解决3D数据稀缺问题上的有效性。

## 🎯 应用场景

该研究成果可应用于机器人导航、自动驾驶、三维场景理解、虚拟现实和增强现实等领域。通过提升3D模型在数据稀缺情况下的识别能力，可以降低对大量标注数据的依赖，加速相关技术在实际场景中的部署和应用。未来，该方法有望扩展到更多模态的数据融合和更复杂的3D场景理解任务中。

## 📄 摘要（原文）

> The rapid growth of 3D digital content necessitates expandable recognition systems for open-world scenarios. However, existing 3D class-incremental learning methods struggle under extreme data scarcity due to geometric misalignment and texture bias. While recent approaches integrate 3D data with 2D foundation models (e.g., CLIP), they suffer from semantic blurring caused by texture-biased projections and indiscriminate fusion of geometric-textural cues, leading to unstable decision prototypes and catastrophic forgetting. To address these issues, we propose Cross-Modal Geometric Rectification (CMGR), a framework that enhances 3D geometric fidelity by leveraging CLIP's hierarchical spatial semantics. Specifically, we introduce a Structure-Aware Geometric Rectification module that hierarchically aligns 3D part structures with CLIP's intermediate spatial priors through attention-driven geometric fusion. Additionally, a Texture Amplification Module synthesizes minimal yet discriminative textures to suppress noise and reinforce cross-modal consistency. To further stabilize incremental prototypes, we employ a Base-Novel Discriminator that isolates geometric variations. Extensive experiments demonstrate that our method significantly improves 3D few-shot class-incremental learning, achieving superior geometric coherence and robustness to texture bias across cross-domain and within-domain settings.


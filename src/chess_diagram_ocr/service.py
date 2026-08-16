"""Camada de serviço: o pipeline de OCR sem nenhuma dependência de interface (S-31).

**O problema.** `app_tkinter._detect_and_predict_items` e o `run_ocr_for_boards` do Streamlit
implementavam o mesmo fluxo de forma independente -- detectar, prever com orientação,
inferir o lado a jogar, conferir legalidade -- e já tinham divergido. O Streamlit não
refinava o recorte pelo contorno, não guardava a matriz por casa (então nunca poderia ter o
heatmap da S-21) e não registrava a fonte de detecção da S-12. Cada ganho de precisão das
Fases 2 e 3 precisava ser reimplementado duas vezes, e a segunda vez ficava para trás.

**O que este módulo é.** `OcrService` concentra o pipeline; os dois frontends viram
apresentação. Nada aqui importa `tkinter`, `streamlit` ou `PIL` -- o critério de aceite da
S-31 é justamente poder testá-lo sem Tk, e é o que `tests/test_service.py` faz.

**O que ele devolve.** `RecognizedDiagram` no lugar do `dict[str, Any]` que as duas UIs
passavam adiante. O dicionário não era só falta de tipo: ele obrigava cada frontend a
escolher que chaves valia a pena preencher, e foi assim que as duas leituras divergiram
sem que nada quebrasse.

**O lock não é zelo.** A S-31 aponta o defeito concreto: `reload_model()` é chamada da
thread de treino e zerava o cache do modelo enquanto uma thread de OCR podia estar usando,
e o treino **reescreve o arquivo `.pt`** que uma carga concorrente estaria lendo. Aqui a
carga e o uso do modelo acontecem sob o mesmo lock, então trocar de modelo espera o
reconhecimento em andamento terminar em vez de disputar com ele.
"""

from __future__ import annotations

import logging
import threading
from collections.abc import Callable, Iterator, Sequence
from contextlib import contextmanager
from dataclasses import dataclass, field
from pathlib import Path
from typing import Any

import cv2
import numpy as np

from .board_detection import detect_boards
from .config import (
    BOARD_SIZE,
    DEFAULT_MAX_BOARDS,
    DEFAULT_MODEL_PATH,
    DEFAULT_ORIENTATION_MODE,
)
from .dataset import append_training_sample
from .detection import detect_diagrams_in_pdf_page
from .fen_utils import PositionCheck, check_position, square_name
from .inference import (
    BoardPrediction,
    describe_device,
    load_model,
    predict_board,
    predict_with_orientation,
)
from .pdf_io import get_pdf_page_count, render_pdf_page
from .pdf_text import DiagramContext, contexts_for_pdf_page
from .preprocess import IDENTITY, NormalizerConfig
from .semantics import SideToMove, compose_fen, infer_side_to_move

logger = logging.getLogger(__name__)

REFINE_PAD_RATIO = 0.08
"""Folga em volta do quad antes de procurar o contorno de novo.

Sem folga, o recorte cortaria a própria borda que o detector precisa enxergar para achar
os quatro cantos; com folga demais, ele reencontra o diagrama vizinho."""


@dataclass
class RecognizedDiagram:
    """Um diagrama e tudo que a interface precisa saber sobre ele.

    Nem todo diagrama no editor veio do OCR: a fila de revisão (S-22) e o navegador do
    dataset (S-23) abrem um tabuleiro que já tem rótulo. Por isso `prediction` e `legality`
    são opcionais, e `is_legal` distingue **três** respostas -- legal, ilegal e não
    avaliada. Colapsar as duas últimas em `False` faria a barra de status gritar "ILEGAL"
    para toda amostra vinda do dataset.

    Mutável de propósito em três campos: o usuário troca o lado a jogar (e a procedência
    vira `"manual"`) e corrige casas à mão. `edited_by_hand` é o que faz o cache de
    navegação avisar antes de descartar a página -- perder uma leitura do modelo custa
    rodar o OCR de novo, perder uma correção humana custa o trabalho da pessoa.
    """

    index: int
    board_rgb: np.ndarray
    placement: str
    """Só o campo de peças da FEN. A vez mora em `side_to_move`, e juntá-las numa string
    é o que fazia a informação de lado a jogar se perder pelo caminho (S-17)."""

    # --- sinais por casa. Existem sem predição: um item da fila traz os agregados que a
    # --- S-22 gravou, mas não a matriz (64, 13), que custaria ~5,6 MB por livro em JSON.
    min_confidence: float = 0.0
    mean_confidence: float = 0.0
    uncertain_squares: list[int] = field(default_factory=list)
    square_confidences: list[float] = field(default_factory=list)
    changed_squares: list[int] = field(default_factory=list)
    probs: np.ndarray | None = None

    legality: PositionCheck | None = None
    """`None` significa "não avaliada", não "legal"."""

    rotation: int | None = None
    orientation_ambiguous: bool = False
    orientation_reason: str = ""

    quad: list[list[float]] | None = None
    """Os quatro cantos em pixels da página renderizada. `None` no caminho da S-12, que
    localiza por bbox em vez de por contorno -- ali quem responde "onde" é `bbox_pdf`."""

    bbox_pdf: tuple[float, float, float, float] | None = None
    """Onde o diagrama está na página, em **pontos do PDF** (S-41).

    O detector híbrido já carrega isto em cada `DiagramCandidate` desde a S-12, e
    `recognize_page` o descartava: a `RecognizedDiagram` saía sabendo *o que* leu e não
    *de onde*. Pontos, e não pixels, porque a anotação do conjunto de campo precisa
    sobreviver a uma troca de DPI -- 220 hoje, 300 amanhã, e a mesma página passaria a
    ter outro sistema de coordenadas."""

    context: DiagramContext | None = None
    detection_source: str = ""

    side_to_move: str = "w"
    side_to_move_source: str = "default"
    """`"text"`, `"legality"` e `"default"` vêm da S-17; `"manual"` e `"queue"` só a
    interface produz. Por isso é `str` e não o `SideSource` da `semantics`: o conjunto
    aqui é maior que o daquele módulo."""

    side_to_move_reason: str = ""
    side_conflicting: bool = False
    edited_by_hand: bool = False

    prediction: BoardPrediction | None = None
    """A leitura completa, quando houve OCR. É de onde sai o tooltip das 3 classes."""

    # ------------------------------------------------------------------------ construtores

    @classmethod
    def from_prediction(
        cls,
        index: int,
        board_rgb: np.ndarray,
        prediction: BoardPrediction,
        *,
        side: SideToMove,
        legality: PositionCheck,
        rotation: int = 0,
        orientation_ambiguous: bool = False,
        orientation_reason: str = "",
        quad: list[list[float]] | None = None,
        bbox_pdf: tuple[float, float, float, float] | None = None,
        context: DiagramContext | None = None,
        detection_source: str = "",
    ) -> RecognizedDiagram:
        decode = prediction.decode
        return cls(
            index=index,
            board_rgb=board_rgb,
            placement=prediction.fen_board,
            min_confidence=float(prediction.min_confidence),
            mean_confidence=float(prediction.mean_confidence),
            uncertain_squares=list(prediction.uncertain_squares),
            square_confidences=[float(value) for value in prediction.square_confidences],
            changed_squares=(
                [square for square, _argmax, _final in decode.changed_squares] if decode else []
            ),
            probs=prediction.probs,
            legality=legality,
            rotation=rotation,
            orientation_ambiguous=orientation_ambiguous,
            orientation_reason=orientation_reason,
            quad=quad,
            bbox_pdf=bbox_pdf,
            context=context,
            detection_source=detection_source,
            side_to_move="w" if side.color else "b",
            side_to_move_source=str(side.source),
            side_to_move_reason=side.reason,
            side_conflicting=side.conflicting,
            prediction=prediction,
        )

    @classmethod
    def from_label(
        cls,
        board_rgb: np.ndarray,
        placement: str,
        *,
        side_to_move: str = "w",
        side_to_move_source: str = "default",
        side_to_move_reason: str = "",
        detection_source: str = "",
        **signals: Any,
    ) -> RecognizedDiagram:
        """Um tabuleiro que já tem rótulo: item da fila de revisão ou linha do dataset.

        Não inventa legalidade nem confiança. O que a origem souber vai em `signals`; o
        que ela não souber fica no default, que é honestamente "não sei".

        `side_to_move_source` cai em `"default"`, não em `"manual"`: os dois chamadores
        reais informam a procedência (`"queue"` e `"manual"`), e supor que um humano
        decidiu tem consequência -- é o que faz o cache de navegação avisar antes de
        descartar a página, e o aviso perderia o sentido se valesse para todo diagrama.
        """
        return cls(
            index=0,
            board_rgb=board_rgb,
            placement=placement,
            side_to_move=side_to_move if side_to_move in ("w", "b") else "w",
            side_to_move_source=side_to_move_source,
            side_to_move_reason=side_to_move_reason,
            detection_source=detection_source,
            **signals,
        )

    # ------------------------------------------------------------------ leituras derivadas

    @property
    def is_legal(self) -> bool | None:
        return self.legality.is_legal if self.legality is not None else None

    @property
    def is_fatal(self) -> bool | None:
        return self.legality.is_fatal if self.legality is not None else None

    @property
    def problems(self) -> tuple[str, ...]:
        return tuple(self.legality.problems) if self.legality is not None else ()

    @property
    def exercise_number(self) -> int | None:
        return self.context.exercise_number if self.context else None

    @property
    def caption(self) -> str:
        return self.context.caption if self.context else ""

    @property
    def side_is_white(self) -> bool:
        return self.side_to_move != "b"

    def runner_up(self, square_index: int) -> tuple[int, float] | None:
        """Segunda classe mais provável de uma casa, ou `None` sem a matriz por casa."""
        if self.prediction is None:
            return None
        return self.prediction.runner_up(square_index)

    def set_side_to_move(self, side: str, *, source: str = "manual") -> None:
        """Troca a vez e registra que a resposta passou a ser de outra procedência.

        Zera `side_conflicting` porque a discordância entre texto e posição era sobre o
        palpite automático; uma vez que um humano decidiu, não há mais duas fontes.
        """
        self.side_to_move = "b" if str(side) == "b" else "w"
        self.side_to_move_source = source
        self.side_conflicting = False

    def resolve_legality(self, placement: str | None = None) -> PositionCheck:
        """Reavalia a legalidade com a vez e o posicionamento atuais, e guarda o resultado.

        Trocar de quem é a vez pode resolver o "xeque invertido" sem mexer em nenhuma peça
        (S-17), então a legalidade não pode ficar congelada no que o OCR decidiu.
        """
        self.legality = check_position(
            compose_fen(placement if placement is not None else self.placement, self.side_is_white)
        )
        return self.legality


@dataclass(frozen=True)
class RecheckReport:
    """O que o modelo diz sobre uma amostra já rotulada, comparado ao rótulo (S-23)."""

    placement: str
    """O rótulo gravado no `labels.csv`."""

    prediction: BoardPrediction

    @property
    def differing_squares(self) -> list[int]:
        rotulo = _squares(self.placement)
        lido = _squares(self.prediction.fen_board)
        return [i for i in range(64) if rotulo[i] != lido[i]]

    @property
    def agrees(self) -> bool:
        return not self.differing_squares

    def describe(self, filename: str, *, max_squares: int = 12) -> str:
        """O relatório em pt-BR que a interface mostra.

        Corta em `max_squares` porque uma amostra em que o modelo discorda de 40 casas não
        precisa de lista: ela precisa de olho humano, e a contagem já diz isso.
        """
        linhas = [
            f"Amostra: {filename}",
            f"Rotulo:  {self.placement}",
            f"Modelo:  {self.prediction.fen_board}",
            f"Confianca minima do modelo: {self.prediction.min_confidence:.3f}",
            "",
        ]
        divergentes = self.differing_squares
        if not divergentes:
            linhas.append("O modelo concorda com o rotulo em todas as 64 casas.")
            return "\n".join(linhas)

        linhas.append(f"Divergem em {len(divergentes)} casa(s):")
        rotulo = _squares(self.placement)
        lido = _squares(self.prediction.fen_board)
        for index in divergentes[:max_squares]:
            confianca = float(self.prediction.square_confidences[index])
            linhas.append(
                f"  {square_name(index)}: rotulo {rotulo[index] or 'vazia'} | "
                f"modelo {lido[index] or 'vazia'} ({confianca:.1%})"
            )
        if len(divergentes) > max_squares:
            linhas.append(f"  ... e outras {len(divergentes) - max_squares}")
        return "\n".join(linhas)


def _squares(placement: str) -> list[str]:
    """As 64 casas de um campo de peças, `""` para vazia, em ordem de leitura."""
    casas: list[str] = []
    for linha in str(placement).split("/"):
        for char in linha:
            if char.isdigit():
                casas.extend([""] * int(char))
            else:
                casas.append(char)
    return (casas + [""] * 64)[:64]


@dataclass(frozen=True)
class RecognitionOrigin:
    """De onde veio um reconhecimento.

    Existia como string montada por f-string em três lugares e interpretada em dois, com
    formatos que precisavam concordar sem que nada garantisse isso. O texto continua o
    mesmo -- `pdf:livro.pdf:page:16`, `local-image:foto.png` -- porque ele aparece na
    barra de status e no cache de página; o que muda é haver um só lugar que o escreve e
    o lê.
    """

    kind: str
    """`"pdf"`, `"crop"` ou `"image"`."""

    document: str = ""
    page_index: int | None = None
    crop: tuple[int, int, int, int] | None = None

    @classmethod
    def for_page(cls, document: str, page_index: int) -> RecognitionOrigin:
        return cls(kind="pdf", document=document, page_index=int(page_index))

    @classmethod
    def for_crop(
        cls, document: str, page_index: int, crop: tuple[int, int, int, int]
    ) -> RecognitionOrigin:
        return cls(kind="crop", document=document, page_index=int(page_index), crop=crop)

    @classmethod
    def for_image(cls, filename: str) -> RecognitionOrigin:
        return cls(kind="image", document=filename)

    def as_text(self) -> str:
        if self.kind == "image":
            return f"local-image:{self.document}"
        base = f"pdf:{self.document}:page:{self.page_index}"
        if self.kind == "crop" and self.crop is not None:
            x0, y0, x1, y1 = self.crop
            return f"{base}:crop=({x0},{y0})-({x1},{y1})"
        return base

    def __str__(self) -> str:
        return self.as_text()

    @property
    def is_whole_page(self) -> bool:
        """Se o resultado cobre a página inteira, e por isso pode ir para o cache de página.

        Recorte de área fica de fora: guardá-lo como "o resultado da página 16" faria a
        navegação devolver dois diagramas onde a página tem nove -- pior que não guardar
        nada, porque parece completo. Mesma decisão de `page_index_from_origin`.
        """
        return self.kind == "pdf" and self.page_index is not None

    @classmethod
    def parse(cls, text: str) -> RecognitionOrigin:
        """Interpreta a forma textual. Origem irreconhecível vira `image`, não erro.

        A origem é metadado de procedência, e uma que não bata com nenhum formato conhecido
        ainda vale mais gravada do que trocada por uma exceção no meio de um salvamento.
        """
        text = str(text)
        if text.startswith("local-image:"):
            return cls(kind="image", document=text.partition("local-image:")[2])
        if not text.startswith("pdf:"):
            return cls(kind="image", document=text)

        resto = text.partition("pdf:")[2]
        # `rpartition`: o marcador que vale é o **último**. Um nome de arquivo que contenha
        # `:page:` cortaria no lugar errado com `partition`, e o índice da página é o que
        # decide se o resultado vai para o cache de navegação.
        document, encontrou, cauda = resto.rpartition(":page:")
        if not encontrou:
            return cls(kind="image", document=text)
        page_part, marcador, _crop = cauda.partition(":crop=")
        try:
            page_index = int(page_part)
        except ValueError:
            return cls(kind="image", document=text)
        return cls(
            kind="crop" if marcador else "pdf",
            document=document,
            page_index=page_index,
        )

    def sample_fields(self) -> dict[str, Any]:
        """Os campos de procedência da S-19, no formato que `append_training_sample` pede.

        A página vai **1-based**: é o número que o usuário vê na interface e no leitor de
        PDF, e gravar o índice interno faria toda amostra apontar para a página anterior.
        """
        if self.kind == "image" or self.page_index is None:
            return {"source_pdf": self.document, "source_page": ""}
        return {"source_pdf": self.document, "source_page": self.page_index + 1}


@dataclass(frozen=True)
class RecognitionOptions:
    """Os parâmetros que mudam o que o OCR lê, reunidos para não viajarem soltos."""

    model_path: Path = DEFAULT_MODEL_PATH
    orientation: str = DEFAULT_ORIENTATION_MODE
    max_boards: int = DEFAULT_MAX_BOARDS
    dpi: int = 220

    normalizer: NormalizerConfig = IDENTITY
    """Normalização do tabuleiro antes do corte em casas (S-39).

    Padrão `IDENTITY`, que é o pipeline anterior. Ligar etapas aqui muda o domínio que o
    modelo vê, e um checkpoint treinado sem elas não é o mesmo modelo -- ver
    `NormalizerConfig.version`."""

    refine_detected_boards: bool = False
    """Rodar o detector de contorno dentro do quad para alinhar melhor o recorte.

    Vale para imagem solta e para a página renderizada; **não** vale para candidato vindo
    da imagem embutida do PDF, que já sai alinhado pelo warp da S-12 -- ali refinar de novo
    só acrescenta erro. `recognize_page` desliga sozinha, por isso."""

    fallback_to_full_image: bool = False
    """Se nada for detectado, tratar a imagem inteira como o tabuleiro.

    Ligado no recorte de área: quem selecionou um pedaço da página com o mouse já disse
    onde está o diagrama, e recusar por não achar contorno seria ignorar essa informação."""


class OcrService:
    """O pipeline de reconhecimento, com o modelo carregado uma vez e sob lock."""

    def __init__(
        self,
        *,
        model_path: Path | None = None,
        loader: Callable[[Path], tuple[Any, str]] = load_model,
        caption_reader: Any = None,
    ) -> None:
        """`loader` troca de onde vem o modelo, mantendo o resto do pipeline igual.

        Serve aos testes, que não têm um `.pt` para carregar, e é o encaixe por onde a
        sessão ONNX da S-30 entra quando alguém quiser o modo rápido na interface -- ela
        já devolve o mesmo par `(modelo, dispositivo)`.

        `caption_reader` é o OCR de legenda da S-43, e `None` -- o padrão -- é o pipeline
        como sempre foi. Recebido pronto, e não construído aqui: o serviço não deve saber
        que existe um extra opcional de OCR, e quem lê a configuração é a interface. Ver
        `ocr_caption.caption_reader_from_settings`.
        """
        self._lock = threading.RLock()
        self._loader = loader
        self._model: Any = None
        self._device: str | None = None
        self._loaded_path: Path | None = None
        self._requested_path = Path(model_path) if model_path is not None else DEFAULT_MODEL_PATH
        self._caption_reader = caption_reader

    @property
    def caption_reader(self) -> Any:
        """O leitor de legenda por OCR em uso, ou `None`. Repassado à varredura (S-43)."""
        return self._caption_reader

    # ------------------------------------------------------------------------------ modelo

    @property
    def model_path(self) -> Path:
        return self._requested_path

    @property
    def device(self) -> str | None:
        """Dispositivo do modelo carregado, ou `None` se ainda não há um."""
        return self._device

    @property
    def device_label(self) -> str:
        """Descrição em pt-BR do dispositivo, para a barra de status (S-30)."""
        return describe_device(self._device) if self._device is not None else "nenhum modelo carregado"

    @contextmanager
    def model_session(self, model_path: Path | None = None) -> Iterator[tuple[Any, str]]:
        """Empresta o modelo pela duração de um bloco, segurando o lock.

        O lock cobre o **uso**, não só a carga. É o que a S-31 pede: enquanto uma página
        está sendo reconhecida, o treino que terminou não consegue trocar o `.pt` debaixo
        dela, e duas threads não disparam duas cargas do mesmo arquivo.
        """
        with self._lock:
            yield self._ensure_model(model_path)

    def _ensure_model(self, model_path: Path | None = None) -> tuple[Any, str]:
        alvo = Path(model_path) if model_path is not None else self._requested_path
        if self._model is None or self._loaded_path != alvo:
            logger.info("Carregando modelo: %s", alvo)
            model, device = self._loader(alvo)
            self._model = model
            self._device = device
            self._loaded_path = alvo
            self._requested_path = alvo
            logger.info("Modelo carregado em %s.", describe_device(device))
        return self._model, str(self._device)

    def load(self, model_path: Path | None = None) -> tuple[Any, str]:
        """Garante o modelo carregado e devolve `(modelo, dispositivo)`."""
        with self._lock:
            return self._ensure_model(model_path)

    def invalidate_model(self, model_path: Path | None = None) -> None:
        """Descarta o modelo em memória; a próxima leitura recarrega do disco.

        Chamada ao fim do treino. Espera o reconhecimento em andamento porque pega o mesmo
        lock -- era exatamente essa a corrida que a S-31 aponta.
        """
        with self._lock:
            self._model = None
            self._device = None
            self._loaded_path = None
            if model_path is not None:
                self._requested_path = Path(model_path)
            logger.info("Cache do modelo limpo; a proxima leitura recarrega de %s.", self._requested_path)

    # -------------------------------------------------------------------------------- PDF

    def page_count(self, pdf_source: Any) -> int:
        return get_pdf_page_count(pdf_source)

    def render_page(self, pdf_source: Any, page_index: int, *, dpi: int) -> np.ndarray:
        return render_pdf_page(pdf_source, page_index, dpi=dpi)

    # ------------------------------------------------------------------- reconhecimento

    def recognize_page(
        self,
        pdf_source: Any,
        page_index: int,
        page_rgb: np.ndarray | None = None,
        *,
        options: RecognitionOptions,
    ) -> list[RecognizedDiagram]:
        """Reconhece uma página de PDF pelo detector híbrido da S-12.

        É o caminho que a exportação usa. Ter a interface num detector e o PGN noutro
        recriaria, no recorte, o mesmo desencontro que a S-14 corrigiu na numeração: a tela
        mostrando um diagrama e o `[Diagram "2"]` apontando para outro.
        """
        if page_rgb is None:
            page_rgb = self.render_page(pdf_source, page_index, dpi=options.dpi)

        candidates = detect_diagrams_in_pdf_page(
            pdf_source, page_index, page_rgb, max_boards=options.max_boards
        )
        boards = [(candidate.board_rgb, None) for candidate in candidates]
        # Mesmo contexto textual que a exportação lê (S-16): a interface mostrando um lado a
        # jogar e o PGN gravando outro seria pior que não mostrar nada.
        contexts = contexts_for_pdf_page(
            pdf_source,
            page_index,
            [c.bbox_pdf for c in candidates],
            caption_reader=self._caption_reader,
        )

        return self._predict_boards(
            image_rgb=page_rgb,
            boards=boards,
            options=options,
            contexts=contexts,
            detection_sources=[candidate.source for candidate in candidates],
            # O recorte embutido já vem alinhado pelo warp da S-12; refinar de novo só soma erro.
            refine=False,
            # Onde cada diagrama está na página. O detector já sabia e o serviço jogava fora
            # -- e é o que o conjunto de campo da S-41 precisa para casar com a anotação.
            bboxes_pdf=[candidate.bbox_pdf for candidate in candidates],
        )

    def recognize_image(
        self,
        image_rgb: np.ndarray,
        *,
        options: RecognitionOptions,
        boards: Sequence[tuple[np.ndarray, np.ndarray | None]] | None = None,
    ) -> list[RecognizedDiagram]:
        """Reconhece uma imagem solta: print, foto, recorte ou página já renderizada.

        `boards` permite pular a detecção quando quem chama já sabe onde está o tabuleiro
        (a caixa "a imagem já contém somente um tabuleiro" do Streamlit).
        """
        detected = (
            list(boards)
            if boards is not None
            else detect_boards(image_rgb=image_rgb, max_boards=options.max_boards)
        )
        if options.fallback_to_full_image and not detected:
            detected = [(image_rgb, None)]

        return self._predict_boards(
            image_rgb=image_rgb,
            boards=detected,
            options=options,
            contexts=[],
            detection_sources=[],
            refine=options.refine_detected_boards,
        )

    def recognize_region(
        self,
        page_rgb: np.ndarray,
        region: tuple[int, int, int, int],
        *,
        options: RecognitionOptions,
    ) -> list[RecognizedDiagram]:
        """Reconhece um retângulo escolhido à mão sobre a página.

        Cai para a imagem inteira quando não acha contorno: quem arrastou o mouse em volta
        do diagrama já respondeu onde ele está, e recusar por causa do detector jogaria
        fora essa informação.
        """
        x0, y0, x1, y1 = region
        h, w = page_rgb.shape[:2]
        x0 = max(0, min(w - 1, int(x0)))
        y0 = max(0, min(h - 1, int(y0)))
        x1 = max(x0 + 1, min(w, int(x1)))
        y1 = max(y0 + 1, min(h, int(y1)))
        cropped = np.ascontiguousarray(page_rgb[y0:y1, x0:x1])
        if cropped.size == 0:
            raise ValueError("Selecao vazia: o retangulo escolhido nao cobre nenhum pixel.")

        return self.recognize_image(
            cropped,
            options=RecognitionOptions(
                model_path=options.model_path,
                orientation=options.orientation,
                max_boards=options.max_boards,
                dpi=options.dpi,
                normalizer=options.normalizer,
                refine_detected_boards=options.refine_detected_boards,
                fallback_to_full_image=True,
            ),
        )

    def _predict_boards(
        self,
        *,
        image_rgb: np.ndarray,
        boards: Sequence[tuple[np.ndarray, np.ndarray | None]],
        options: RecognitionOptions,
        contexts: Sequence[DiagramContext | None],
        detection_sources: Sequence[str],
        refine: bool,
        bboxes_pdf: Sequence[tuple[float, float, float, float]] = (),
    ) -> list[RecognizedDiagram]:
        """O núcleo comum: prever, decidir orientação, inferir a vez, conferir legalidade."""
        if not boards:
            raise ValueError("Nenhum tabuleiro foi detectado na imagem selecionada.")

        diagrams: list[RecognizedDiagram] = []
        with self.model_session(options.model_path) as (model, device):
            for idx, (board_rgb, quad) in enumerate(boards):
                board_for_pred, quad_for_item = (
                    refine_board_from_quad(image_rgb, quad) if refine else (board_rgb, quad)
                )
                oriented = predict_with_orientation(
                    board_for_pred,
                    model,
                    device,
                    mode=options.orientation,  # type: ignore[arg-type]
                    normalizer=options.normalizer,
                )
                prediction = oriented.prediction
                context = contexts[idx] if idx < len(contexts) else None
                side: SideToMove = infer_side_to_move(prediction.fen_board, context)
                diagrams.append(
                    RecognizedDiagram.from_prediction(
                        idx,
                        board_for_pred,
                        prediction,
                        side=side,
                        legality=check_position(compose_fen(prediction.fen_board, side)),
                        rotation=oriented.rotation,
                        orientation_ambiguous=oriented.ambiguous,
                        orientation_reason=oriented.reason,
                        quad=quad_for_item.tolist() if quad_for_item is not None else None,
                        bbox_pdf=bboxes_pdf[idx] if idx < len(bboxes_pdf) else None,
                        context=context,
                        detection_source=detection_sources[idx] if idx < len(detection_sources) else "",
                    )
                )
        return diagrams

    # ---------------------------------------------------------------------------- dataset

    def recheck_label(self, board_rgb: np.ndarray, placement: str) -> RecheckReport:
        """Roda o modelo numa amostra já rotulada e compara com o rótulo (S-23).

        É o caminho para achar rótulo **humano** errado: se o modelo discorda em uma casa e
        o rótulo é o esquisito, quem está errado é a anotação -- e o `.pt` treinado sobre
        ela está aprendendo o erro.
        """
        with self.model_session() as (model, device):
            prediction = predict_board(cv2.resize(board_rgb, (BOARD_SIZE, BOARD_SIZE)), model, device)
        return RecheckReport(placement=placement, prediction=prediction)

    def save_sample(
        self,
        diagram: RecognizedDiagram,
        fen: str,
        *,
        csv_path: Path,
        samples_dir: Path,
        origin: RecognitionOrigin | None = None,
        side_to_move: str | None = None,
        corrected_by: str = "",
        allow_illegal: bool = False,
    ) -> Path:
        """Grava a amostra rotulada com os campos de procedência da S-19.

        A procedência é o que permite, depois, agrupar o split por livro (S-07), auditar
        por fonte de detecção e voltar ao PDF para recortar de novo.

        `allow_illegal` é a resposta "sim" à pergunta de `ui.legality.illegal_save_question`,
        repassada intacta: quem decide é a pessoa, e este método não tem o que acrescentar à
        decisão dela.
        """
        campos: dict[str, Any] = {"source_pdf": "", "source_page": ""}
        if origin is not None:
            campos = origin.sample_fields()

        return append_training_sample(
            board_rgb=diagram.board_rgb,
            fen=fen,
            csv_path=csv_path,
            samples_dir=samples_dir,
            allow_illegal=allow_illegal,
            side_to_move=side_to_move if side_to_move is not None else diagram.side_to_move,
            source_diagram=diagram.index + 1,
            detection_source=diagram.detection_source,
            corrected_by=corrected_by,
            **campos,
        )


def refine_board_from_quad(
    image_rgb: np.ndarray,
    quad: np.ndarray | None,
    pad_ratio: float = REFINE_PAD_RATIO,
) -> tuple[np.ndarray, np.ndarray | None]:
    """Reprocura o contorno dentro da região do quad, para alinhar melhor o recorte.

    O detector de página acha *onde* está o diagrama; rodá-lo de novo numa vizinhança
    apertada acha *os cantos*, e é o alinhamento da grade 8×8 que decide se cada casa cai
    inteira dentro da sua imagem. Sem quad não há o que refinar, e a imagem é só redimensionada.
    """
    if quad is None:
        return cv2.resize(image_rgb, (BOARD_SIZE, BOARD_SIZE)), None

    h, w = image_rgb.shape[:2]
    x0 = max(0, int(np.floor(np.min(quad[:, 0]))))
    y0 = max(0, int(np.floor(np.min(quad[:, 1]))))
    x1 = min(w, int(np.ceil(np.max(quad[:, 0]))))
    y1 = min(h, int(np.ceil(np.max(quad[:, 1]))))
    pad = int(max(max(1, x1 - x0), max(1, y1 - y0)) * pad_ratio)

    rx0 = max(0, x0 - pad)
    ry0 = max(0, y0 - pad)
    rx1 = min(w, x1 + pad)
    ry1 = min(h, y1 + pad)
    roi = image_rgb[ry0:ry1, rx0:rx1]
    if roi.size == 0:
        return cv2.resize(image_rgb, (BOARD_SIZE, BOARD_SIZE)), None

    refined = detect_boards(image_rgb=roi, max_boards=1, warn_on_cap=False)
    if not refined:
        return cv2.resize(image_rgb[y0:y1, x0:x1], (BOARD_SIZE, BOARD_SIZE)), quad

    refined_board, refined_quad = refined[0]
    if refined_quad is not None:
        refined_quad = refined_quad + np.array([rx0, ry0], dtype=np.float32)
    return refined_board, refined_quad
